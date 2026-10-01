# MiniMax H3 提示词 Agent 编写指南

本文是给提示词 Agent 使用的操作规范。目标是把用户需求、RH Workflow Desk 的积木库和媒体文件，组合成可直接用于 MiniMax H3 的英文提示词。

最高优先级规则来自 `minimax-h3-prompt` skill 及其官方参考指南；`/Users/apple/Documents/VideoMake/ref/Resources.json` 是当前项目的媒体与文本资源清单。提示词 Agent 必须先复用清单中的已有卡片，再用自由文本补齐缺口。

## 1. 不可违反的优先级

按以下顺序处理信息，出现冲突时由上层规则覆盖下层规则：

1. 用户明确提出的主体、动作、场景、时长、模式、镜头、对白、声音和保留/修改要求。
2. MiniMax H3 skill 的模式、字段、标签、镜头、对白和音频格式要求。
3. `Resources.json` 及其指向的 JSON 中已有的媒体卡片和文本积木。
4. 自由文本：只用于连接已有卡片、补充卡片没有表达的时间变化、镜头变化或用户专属要求。

不要为了“写得完整”重复创造已有积木，也不要让自由文本覆盖卡片中的外观、服装、背景、动作或音频事实。若用户要求与卡片内容冲突，优先执行用户要求，并明确把冲突内容作为改写或替换，而不是悄悄混用。

## 2. 资源库是唯一的可复用来源

读取 `/Users/apple/Documents/VideoMake/ref/Resources.json`，用它的 `media_root` 解析所有相对路径。当前 `media_root` 是 `.`，因此实际媒体根目录为：

`/Users/apple/Documents/VideoMake/ref`

不要从旧 Markdown 中抽取积木内容，也不要把生成的提示词反写回 Markdown。JSON 是积木内容的唯一维护来源；媒体文件仍位于 `ref` 下对应的目录。

### 2.4 结果 JSON 的保存位置

Agent 生成或修改的提示词组结果 JSON，统一放在仓库根目录下的相对路径：

`data/prompt/groups/`

每个提示词组使用一个独立文件：

`data/prompt/groups/<group-id>.json`

相关文件的职责如下：

- `data/prompt/groups/<group-id>.json`：单个提示词组的完整内容，是 Agent 生成结果的落盘文件。
- `data/prompt/groups.json`：提示词组索引，不承载每个组的全部内容。
- `data/prompt/state.json`：当前提示词工坊的组装顺序和状态，不是资源库源文件。

文档、Agent 返回值和内部记录都使用上述相对路径；不要写入 `/Users/apple/Documents/github/rh-workflow-desk/...` 这样的绝对路径。只有读取外部资源时，才根据 `Resources.json` 的 `media_root` 解析 `/Users/apple/Documents/VideoMake/ref`。保存结果时不得覆盖基础积木 JSON，也不得把结果文件放回 `ref` 目录。

### 2.1 清单映射

| 资源键 | JSON 文件 | schema | 用途 |
| --- | --- | --- | --- |
| `prompt` | `prompt/library.json` | `blocks` | 可复用的英文提示词片段、模式字段、镜头、对白、声音和配乐片段 |
| `pose` | `pose/pose.json` | `actions` | 动作/姿势卡；每张卡都有彩色原图和深度图 |
| `character` | `character/character.json` | `references` | 人物、外貌、身份、配件、音色和人物参考 |
| `audio` | `audio/audio.json` | `references` | 可复用源音频或音乐参考 |
| `background` | `background/background.json` | `references` | 场景、地点和环境参考 |
| `clothes` | `clothes/clothes.json` | `references` | 服装和造型参考 |

### 2.2 媒体目录映射

| 媒体类型 | 目录 |
| --- | --- |
| 动作彩色原图 | `pose/color` |
| 动作深度图 | `pose/depth` |
| 人物 | `character` |
| 音频 | `audio` |
| 背景 | `background` |
| 服装 | `clothes` |

### 2.3 当前资源快照

以下数量只是编写本文时的检查结果，不是可以写死在 Agent 逻辑中的常量。每次生成前仍应读取 JSON：

| 来源 | 数量 | 当前内容范围 |
| --- | ---: | --- |
| `prompt/library.json` | 125 | 结构与模式、对象与留存、镜头与运动、场景、画面风格、对白、声音、背景配乐及成人内容相关类别 |
| `pose/pose.json` | 57 | 站立、坐姿、半躺、躺姿、蹲姿、跪趴、背身和性交动作等 |
| `character/character.json` | 157 | 人物身份、五官、面部、音色、原皮、服装/配件和场景参考 |
| `audio/audio.json` | 6 | 音乐与源音频 |
| `background/background.json` | 14 | `绝区零` 场景背景 |
| `clothes/clothes.json` | 6 | 女性服装 |

提示词积木的类别是动态的；当前还包含中文、日文、写实、二次元、电影感、自然光、柔光、环境音、人声、对白、首帧、首尾帧、固定镜头、手持、特写等标签。检索时同时使用 `category`、`tags`、`title` 和 `text`，不要只依赖标题。

“结合所有内容”表示每次生成都要把六个来源作为可检索范围，而不是每条提示词强行使用六类卡片。只选择与用户需求相关且互不冲突的卡片；没有命中的来源应记录为“本次未使用”，不能虚构用途。当前类别索引如下，后续以 JSON 实际内容为准：

- `prompt`：结构与模式、对象与留存、镜头与运动、场景、画面风格、对白、声音、背景配乐、去衣、性交动作。
- `pose`：站立、坐姿、半躺、躺姿、蹲姿、跪趴、背身、性交。
- `character`：人物角色及其五官、面部、音色、原皮、服装、配件、场景和身体参考；角色类别会随资源库增删。
- `audio`：音乐与源音频。
- `background`：场景背景；当前类别为 `绝区零`。
- `clothes`：女性服装。

## 3. JSON 卡片的使用方式

先加载所有来源的 JSON，再根据用户需求建立候选集。卡片字段的基本含义如下：

- 文本积木：`id`、`category`、`tags`、`title`、`text`。
- 动作卡：上述字段，加 `image_path`、`color_image_path`、`depth_image_path` 和 `pair_key`。
- 媒体参考卡：`id`、`kind`、`kind_label`、`category`、`tags`、`source_tags`、`title`、`text`、`image_path`、`audio_path`。

选择卡片后保留其 `id`，最终输出一个“已选积木清单”，便于 UI 或后续 Agent 追溯来源。卡片的 `text` 是可复用的英文语义，`image_path`/`audio_path` 是实际输入文件路径；空路径不能被当成可用媒体。

### 3.1 媒体卡片优先规则

- 人物卡决定人物的身份、外貌、比例、发型、音色或其他固定特征。
- 服装卡决定服装外观；如果用户没有要求换装，不要在自由文本中重新描述一套相互矛盾的衣服。
- 背景卡决定地点、空间结构、色彩和环境元素。
- 动作卡决定姿态、身体关系和动作起点。需要动作参考时，必须保留同一张卡的彩色原图与深度图配对；彩色图是原图，深度图是同一动作的深度辅助图，不要把深度图当成另一位角色或另一张独立动作图。
- 音频卡若被直接复用，使用其实际 `audio_path`；若只是借鉴音乐风格，则只把它作为音频参考，不要声称已经复制原音频。

当多张卡同时描述同一属性时，优先使用更具体、与用户指令匹配度更高的一张；不要把两个不同人物、背景或服装卡的细节无条件拼接。无法判断时，保留候选并在生成前说明需要的选择。

### 3.2 文本积木优先规则

从 `prompt/library.json` 优先查找并复用以下内容：

- `结构与模式`：`summary`、模式首行、任务综述等结构字段。
- `对象与留存`：主体定义、参考保留和属性迁移。
- `镜头与运动`：镜头距离、相机运动、速度和幅度。
- `场景`、`画面风格`：空间、光线、材质、画面风格。
- `对白`、`声音`、`背景配乐`：对白写法、环境声、物理声、人声和非叙事配乐。
- 其他现有类别：用户需求命中时照常检索和复用，不得因为类别名称特殊就跳过。

积木的 `text` 可以按语义合并，但必须删除重复句、解决代词和主体指代，并检查是否产生冲突。只有当现有积木没有覆盖某个用户专属信息时，才写自由文本。

## 4. Agent 工作流

### 第一步：解析用户需求

先抽取以下字段；未指定的内容不要擅自增加强约束：

```text
mode: T2VA | I2VA | FL2VA | L2VA | Full-reference/Ref2VA
duration: 5–15 seconds
visual_inputs: images / videos / none
audio_inputs: audio / none
subjects: characters, objects, clothing, props
setting: background and lighting
action: start state, transition, end state
camera: shot size, angle, movement, speed
dialogue: speaker ids, language, exact words
sound: ambience, physical sounds, diegetic music
score: non-diegetic music or none
visible_text: exact text in the scene
retention: what must be preserved, changed, or transferred
```

### 第二步：确定 H3 模式

- `T2VA`：没有视觉输入，只用文本生成；不写首行对齐声明。
- `I2VA`：输入图作为第一帧；提示词必须从第一帧可见状态开始。
- `FL2VA`：输入图分别作为第一帧和最后一帧；中间必须写出可观察的变化，并收束到最后一帧。
- `L2VA`：输入图作为最后一帧；先描述合理的前置状态，再写出明确转场并落到最后一帧。
- `Full-reference/Ref2VA`：组合图片、视频和音频参考；必须使用六段固定结构。

图片、视频和音频数量必须符合 H3 限制：最多 9 张图片、3 个视频、3 个音频，总数不超过 12 个文件。

### 第三步：检索和选择积木

按照“用户意图 → 媒体卡片 → 文本积木 → 自由文本”的顺序检索：

1. 用人物、背景、服装、动作和音频关键词查询所有对应 JSON。
2. 对每个候选检查 `text`、媒体路径、标签和 `id`，剔除空媒体、重复卡和互相冲突的卡。
3. 用已有文本积木补齐模式字段、镜头、动作衔接、声音和配乐。
4. 记录仍未覆盖的需求，最后才用自由文本补写。

建议把选卡结果整理成如下内部记录；不要把这段 JSON 原样当成 H3 提示词提交：

```json
{
  "mode": "I2VA",
  "cards": [
    {"source": "character", "id": "...", "role": "subject"},
    {"source": "pose", "id": "...", "role": "action", "color": "...", "depth": "..."},
    {"source": "background", "id": "...", "role": "setting"}
  ],
  "text_blocks": ["..."],
  "free_text_gaps": ["transition not covered by cards"]
}
```

### 第四步：建立参考标签

标签必须稳定、短且可复用：

- `<Subject N>`：人物、物体、场景、服装、道具、风格、动作或姿势等可见内容。
- `<Picture N>`：具体图片、首帧、末帧或分镜锚点。
- `<Video N>`：用于剪辑、续写、镜头节奏或整段视频结构的参考视频。
- `<Audio N>`：复制或参考的音频。

一个媒体文件只分配一个明确角色。动作卡的彩色图和深度图属于同一个动作参考；如果工作流需要同时提交二者，应在输入映射中标记为同一 `pair_key`，而不是创建两个不相关的动作主体。

Full-reference 的 `summary` 前缀只能根据真实用途选择：`keyframe completion`、`reference generation`、`video editing`、`video continuation`、`audio reuse`、`audio reference`。不能为了格式好看同时堆叠无关前缀。

## 5. H3 提示词输出模板

最终提示词字段必须为英文。例外只有：对白/歌词放在 `<d>...</d>` 内，以及画面中可见文字放在英文双引号内并保持原文。以下模板中的方括号内容是待替换占位符，不应原样提交。

### 5.1 T2VA

```text
integrated_multimodal_description:
[Describe the subject and setting, then write the audiovisual action in chronological shots.]

overall_soundscape:
[Describe ambience, physical sounds, and non-verbal sounds.]

non_diegetic_music:
[Describe audience-only score, or write N/A if there is none.]
```

### 5.2 I2VA

首行必须声明第一帧对齐，然后按“第一帧锚点 → 动作启动 → 发展 → 结果”组织：

```text
The first frame aligns with <Picture 1>.

integrated_multimodal_description:
[Shot 1] The opening frame shows ... . The subject then ... .
[Shot 2] At 00:02.000, ... .

overall_soundscape:
[Ambience and physical sounds only.]

non_diegetic_music:
[Audience-only score, or N/A.]
```

### 5.3 FL2VA

```text
The first frame aligns with <Picture 1>, and the last frame aligns with <Picture 2>.

integrated_multimodal_description:
[Shot 1] The opening frame shows ... .
[Shot 2] At 00:02.000, ... . [Describe an observable transition.]
[Shot 3] At 00:04.500, ... . The action converges to the final frame of <Picture 2>.

overall_soundscape:
[Ambience and physical sounds only.]

non_diegetic_music:
[Audience-only score, or N/A.]
```

### 5.4 L2VA

```text
The last frame aligns with <Picture 1>.

integrated_multimodal_description:
[Shot 1] Before the ending, ... .
[Shot 2] At 00:03.000, ... . The transition lands precisely on the final frame of <Picture 1>.

overall_soundscape:
[Ambience and physical sounds only.]

non_diegetic_music:
[Audience-only score, or N/A.]
```

### 5.5 Full-reference / Ref2VA

必须按以下顺序输出六段，不能省略或改名：

```text
subject_definitions:
<Subject 1>: [Stable identity and visible attributes.]
<Picture 1>: [Role of the image reference.]
<Audio 1>: [Role of the audio reference, if present.]

summary:
[One or more valid purpose prefixes.] [Describe the requested result.]

retention_analysis:
<Subject 1>: fully_preserved
<Picture 1>: partially_preserved
<Audio 1>: reference

detailed_description:
[About 350–500 English words. Use chronological shots and preserve label consistency.]

overall_soundscape:
[Ambience, physical sounds, and non-verbal sounds only.]

non_diegetic_music:
[Audience-only score, or N/A.]
```

保留标记：视觉使用 `fully_preserved`、`partially_preserved`、`attribute_transfer`、`weak_reference`；音频使用 `fully_copy`、`partially_copy`、`reference`、`weak_reference`。标记必须反映用户真实意图，不能把“参考”写成“复制”。

## 6. 时间、镜头和动作写法

- `[Shot 1]` 不带时间戳；后续镜头使用 `[Shot N] At MM:SS.mmm, ...`。
- 时间戳必须严格递增，并且落在视频时长内。
- 每个切镜都必须引入新的叙事、动作或视角信息；只是远近或角度变化时，优先使用相机运动而不是无意义地切镜。
- 动作写成可观察的因果链：起始姿态、动作启动、动作发展、结果状态。不要只写抽象情绪或“变得更电影感”。
- 相机运动使用自然英文，并可附带幅度和速度：`Zoom`、`Push`、`Pan`、`Truck`、`Tilt`、`Pedestal`、`Arc`、`Tracking`、`Static`、`Shake`、`POV`、`Roll`；幅度用 `with small amplitude`/`with large amplitude`，速度用 `at slow speed`/`at fast speed`。

镜头、转场、光线和声音若已有文本积木，应优先直接复用其语义；自由文本只补充卡片没有表达的“从 A 到 B 如何发生”。

## 7. 对白、画面文字和声音

### 对白

- 给每个说话人分配稳定的 `(S1)`、`(S2)` 编号，并在所有镜头中保持不变；群体说话使用 `(S1,S2)`。
- 在对白前先说明声音特征和说话人身份。
- `<d>` 内只能包含 `[Language]` 和逐字对白/歌词，不放翻译、解释、动作说明或音效。
- 画外音使用 `says in an off-screen voiceover`，并立即说明嘴唇保持闭合。
- 交叉剪辑对白使用 `<scenetrans>` 和连续性描述；被截断的对白以 `<cutoff>` 结尾。

### 画面文字

可见文字必须使用英文双引号，例如 `The sign reads "...".`，并保持用户要求的原文、大小写和标点，不要翻译或改写。

### 音效和配乐

- `overall_soundscape` 只写环境声、物理声和非语言声音，控制在 1–4 个英文句子。
- 对白、歌唱和画面内正在播放的音乐属于画面叙事，应写在 `integrated_multimodal_description`，不要重复写进 `overall_soundscape`。
- `non_diegetic_music` 只写观众听到、场景内角色听不到的配乐，控制在 1–3 个英文句子；说明乐器、速度、节奏和动态。
- 完全静音时才使用 `N/A`；没有配乐但有环境声时，`non_diegetic_music` 写 `N/A`，不影响 `overall_soundscape`。

## 8. 卡片优先的组合示例

假设用户要求：使用已有的人物、服装、背景和动作卡，制作 6 秒 I2VA 片段，人物从静止开始，完成一个已有动作，然后镜头缓慢推进；用户没有指定对白。

Agent 应当：

1. 从 `character`、`clothes`、`background` 和 `pose` 中各选一张匹配卡。
2. 对动作卡同时读取 `color_image_path` 和 `depth_image_path`，确认二者的 `pair_key` 一致。
3. 从 `prompt` 中选取首帧对齐、动作衔接、`Push`/速度、环境声和配乐积木。
4. 只用自由文本补写“静止如何启动动作”这一张卡没有覆盖的过渡。
5. 将人物、背景和动作的固定事实写在开头，将变化写入带时间顺序的镜头中。

组合结果的结构应接近下面的形式；其中具体内容必须来自选中的卡片，而不是照抄示例：

```text
The first frame aligns with <Picture 1>.

integrated_multimodal_description:
[Shot 1] <Subject 1> appears in the setting of <Picture 2>, wearing the clothing from <Picture 3>, in the starting pose from <Picture 4>. The subject remains still for a brief moment.
[Shot 2] At 00:01.500, the subject begins the card-defined action. The camera pushes forward at slow speed, preserving the selected composition and identity.
[Shot 3] At 00:04.000, the action reaches its defined result while the background and clothing remain consistent.

overall_soundscape:
[Use the selected environment and physical-sound blocks.]

non_diegetic_music:
[Use the selected score block, or N/A.]
```

示例中的 `<Picture N>` 仅表示角色映射：如果某张人物/背景/服装卡实际作为可见内容参考，应按其文件角色决定使用 `<Subject N>` 还是 `<Picture N>`，不能机械套用编号。

## 9. 生成前后的校验

### 生成前

- 已读取 `Resources.json` 指向的所有六类 JSON。
- 已优先检查媒体卡片和文本积木，而不是直接写自由文本。
- 所有选中的媒体路径存在；动作原图和深度图成对存在。
- H3 模式、时长、输入数量和参考角色明确。
- 没有把两个互相冲突的角色、背景、服装或动作卡直接混用。

### 生成后

- 所有提示词字段和说明均为英文；只有 `<d>` 内对白/歌词和双引号内的画面文字保留例外。
- 模式首行、六段 Full-reference 顺序、标签名称和保留标记正确。
- `[Shot N]` 顺序清楚，时间戳递增且不超出时长。
- 每个切镜有新信息；动作变化可观察、可执行。
- `(S1)` 等说话人编号稳定，画外音和 `<cutoff>` 写法正确。
- `overall_soundscape` 与 `non_diegetic_music` 没有混入不属于自己的内容。
- 没有重复描述卡片已经确定的细节，也没有让自由文本覆盖卡片事实。
- 输出中附带“已选卡片 ID / 来源 / 角色 / 未覆盖后补文本”，方便用户检查和复用。

## 10. Agent 默认输出契约

除非用户只要求提示词正文，否则按以下顺序返回：

1. `Mode`、时长和输入类型。
2. 已选媒体卡片：来源、标题、`id`、实际媒体角色；动作卡注明原图/深度图配对。
3. 已选文本积木：标题、`id` 和用途。
4. 自由文本补充点：只列出资源库未覆盖的内容。
5. 最终 H3 英文提示词。
6. 一行校验结果：模式、标签、时间轴、音频分层和媒体路径是否通过。

如果资源库没有匹配项，明确写出“未找到匹配卡片”，再使用最少量自由文本补齐；不要虚构卡片 ID、媒体路径、人物设定或音频内容。

## 11. 本次错误复盘：提示词组不能全是自由文本

### 错误表现

第一次生成 group-h3-ref2va-template 时，把模板理解成了 H3 六段文字骨架，组内所有项目都是 kind: "text"。虽然字段顺序看起来正确，但没有加入人物、服装、背景、动作或音频卡片，因此没有真正使用媒体库，也无法把真实媒体作为工作流输入。

### 根因

- 先写了通用占位文本，没有先读取 Resources.json 及其指向的六类 JSON。
- 把“提示词正文中的自由文本占位符”误当成“提示词组的全部内容”。
- 没有在保存前检查组内是否存在 reference / action 项，也没有验证卡片 ID、媒体路径和动作原图/深度图配对。
- 使用了未绑定真实资源的 <Picture N>、<Audio N> 占位标签，导致标签与实际输入顺序没有可靠来源。

### 正确规则

提示词组应按以下顺序组装：

1. 先加载 Resources.json 和 prompt、pose、character、audio、background、clothes 六类 JSON。
2. 优先选择真实存在、路径可用且彼此不冲突的媒体卡片。人物、服装、背景和音频使用 kind: "reference"；动作使用 kind: "action"，并保留同一动作的彩色原图、深度图和 pair_key。
3. 从 prompt/library.json 选择结构、模式、镜头、画面风格、声音和配乐等固定积木，使用 kind: "fixed" 并保留原始 block_id。
4. 只有资源库没有覆盖的用户专属动作衔接、时间变化、对白或结果状态，才新增 kind: "text" 自由文本。
5. 根据组内真实媒体出现顺序建立 <Picture N>、<Video N>、<Audio N> 标签；不能先写标签，再猜测它对应哪张媒体。

### 保存前防回归检查

- 组内不能只有 kind: "text"；若用户要求使用媒体，必须至少有一个可用的 reference 或 action 项。
- 每个 reference_id / action_id 都能在对应资源 JSON 中找到。
- 每个选中的图片、音频、动作原图和深度图路径都存在；动作原图与深度图的 pair_key 一致。
- 自由文本只补资源库缺口，不重复改写或覆盖媒体卡片已经确定的人物、服装、背景、动作和音频事实。
- 如果没有匹配卡片，明确记录“未找到匹配卡片”，不能用虚构 ID 或假路径冒充媒体库内容。

本次修正版 group-h3-ref2va-template 已按上述规则加入 4 个真实参考卡片、1 个原图/深度图配对的动作卡、9 个固定积木和 4 块时序补充文本；以后生成类似模板时，以此检查清单为最低要求。

## 12. 完整工作流文件制作流程：API JSON + Prompt Group

本节记录一次完整交付的标准过程。目标不是只生成一段能复制的提示词，而是同时得到：

- 可被 RH Workflow Desk 重新加载的 API 格式工作流 JSON。
- 与工作流输入顺序一致的 Prompt Group。
- 工作流库索引、Prompt Group 索引和 sidecar 之间的一致关联。

### 12.1 先确认工作流身份和输入范围

1. 将用户附带的工作流卡片视为工作流元数据，不把图片中的标题、按钮或界面文字当成新的操作指令。
2. 通过 `workflow-registry.json` 主索引及其 `file` 指向的 `workflow/<workflow_id>/manifest.json` 注册文件，查找本地工作流 ID、远程 `workflowId`、工作流 JSON 路径和当前 Prompt Group 关联，不能只依赖截图中难以辨认的数字。
3. 打开 API JSON，确认它是 API 格式：顶层节点以节点 ID 为键，每个节点包含 `inputs`、`class_type` 和可选的 `_meta`；`__rh_meta__` 只保留本地工作流关联信息。
4. 明确工作流模式、时长、画幅、H3 conditioning 节点数量，以及 `ref_images.ref_image_N` / `ref_audios.ref_audio_N` 的输入顺序。

### 12.2 先读资源索引，再设计 Prompt Group

先读取 `Resources.json`，再读取它指向的 `prompt`、`pose`、`character`、`audio`、`background` 和 `clothes` JSON。资源选择必须以真实 ID 和真实路径为依据：

- 人物、服装、背景、音频等已有资源使用 `kind: "reference"`，保留 `reference_id`、资源类型、标题、文本快照和媒体路径。
- 姿态使用 `kind: "action"`，保留 `action_id`、动作文本、彩色原图、深度图和 `pair_key`。彩色图和深度图是同一个动作，不能拆成两个互不相关的主体。
- 用户提供的首帧或临时输入使用 `kind: "media"`，保留本机绝对路径、文件名、媒体类型和 MIME 类型；它不是媒体库卡片，不能虚构资源 ID。
- `kind: "fixed"` 只引用 `prompt/library.json` 中真实存在的 `block_id`，用于结构、镜头、声音、配乐或通用动作积木。
- `kind: "text"` 只补资源库没有覆盖的内容，例如动作衔接、时间推进、结果状态或用户专属限制。

资源卡片的排列顺序要与 H3 节点实际接收的媒体顺序一致。这样 `<Picture N>`、`<Video N>`、`<Audio N>` 才能稳定对应到实际输入，而不是先写标签再猜测媒体角色。

### 12.3 以 10Eros 一采为例建立输入映射

该工作流的远程 `workflowId` 为 `2094755110367227906`，H3 conditioning 节点的图片引用顺序如下：

| H3 图片序号 | 工作流节点 | Prompt Group 内容 | 实际资源 |
| --- | --- | --- | --- |
| Picture 1 | `13:image` | `kind: "media"`，首帧输入 | `/Users/apple/Downloads/456.jpg`，需要用户提供 |
| Picture 2 | `75:image` | `kind: "reference"`，人物体型参考 | `character-59f9eb6a9674` |
| Picture 3 | `76:image` | `kind: "reference"`，解剖细节参考 | `character-050278de0219` |
| Picture 4 | `96:image` | `kind: "action"`，姿态动作卡 | `pose-7e4baa5c24b9`，保留 color/depth 配对 |

这里的首帧文件当前不存在，因此只能保留为必填输入，不能用工作流卡片截图或其他无关图片替代。其余人物和姿态资源必须通过媒体库 ID 解析，并在保存前确认文件存在。

### 12.4 生成 Full-reference 提示词

当工作流同时使用首帧、人物属性和姿态等多个参考时，按 Ref2VA / Full-reference 模式生成提示词。六个字段必须按以下顺序出现，并且在 API JSON 的 H3 prompt 节点和 Prompt Group 的组合结果中保持一致：

```text
subject_definitions:
summary:
retention_analysis:
detailed_description:
overall_soundscape:
non_diegetic_music:
```

具体写法：

1. 在 `subject_definitions` 中为每个真实媒体建立稳定的 `<Picture N>` / `<Subject N>` 角色；首帧说明开始画面和 0.00 秒对齐，姿态、体型和解剖卡说明各自只负责的属性。
2. 在 `summary` 中说明结果和参考用途，使用合法的目的前缀，不把摘要写成无时间顺序的剧情介绍。
3. 在 `retention_analysis` 中分别标注 `fully_preserved`、`partially_preserved`、`attribute_transfer` 或 `weak_reference`；首帧如果后续发生去衣等变化，不能错误标成全程完全保留。
4. 在 `detailed_description` 中写可观察的动作因果链：首帧、动作启动、动作发展、姿态结果和镜头保持。已有动作卡的内容直接复用，自由文本只补卡片没有覆盖的过渡。
5. `overall_soundscape` 只放环境声、物理声和非语言声音；`non_diegetic_music` 只放观众听到的场景外配乐，没有配乐时写 `N/A`。
6. 所有参考标签必须在六个字段中保持一致，不能出现未绑定的 `<Picture N>`、`<Subject N>` 或 `<Audio N>`。

### 12.5 同步 API JSON、Prompt Group 和索引

完成提示词组后，按以下顺序保存：

1. 将组合后的最终提示词写入 API JSON 中实际的 H3 prompt 节点，例如本例的 `59:prompt`。
2. 将同一提示词拆成固定积木、媒体库卡片和最少量自由文本，写入 `data/prompt/groups/<group-id>.json`。
3. 写入工作流 sidecar `data/workflow/<workflow_id>/prompt_group.json`，其 `id`、`name` 和 `items` 必须与 Prompt Group 文件一致。
4. 更新 `data/prompt/groups.json` 的 group 索引，以及对应的 `data/workflow/<workflow_id>/manifest.json` 注册文件中的 `workflow_file`、`prompt_group_file`、`prompt_group_id` 和 `prompt_group_name`；主索引只保留 ID 与 manifest 路径。
5. 如果修改了工作流输入路径或节点默认值，同时更新该工作流详细记录的 `input_config`，避免界面默认值与 API JSON 脱节。

### 12.6 只做有证据的工作流修正

基于工作流制作 Prompt Group 时，可以修正已确认的节点契约或失效路径，但不能借机重画工作流：

- 本例 `MinimaxH3LatentUpscaler3D` 的 `device` 应为后端字符串 `"cuda"`，`precision` 应为 `"fp16"`，不能使用布尔值。
- 本例姿态深度图路径已过期，更新为媒体库中与 `pose-7e4baa5c24b9` 对应的当前深度图路径。
- 保留原有 H3 latent 路由；视频 latent 和音频 latent 仍通过 `PT_H3ConcatAVLatent` 合并后送入最终采样器。
- 未确认 schema 或用户意图的模型、采样参数、连线和输入数量不得擅自改变。
- 不把 API Key、账号凭证、代理密码或带 token 的 URL 写入 API JSON、Prompt Group、日志或文档。

### 12.7 保存后的最低校验

保存后必须同时检查文件内容和实际关联，而不能只看写入命令是否成功：

- API JSON、Prompt Group、manifest 和两个索引文件都能被 JSON 解析。
- Prompt Group 不只有 `kind: "text"`；本例包含 1 个首帧媒体、2 个真实人物参考、1 个真实动作卡和 7 个固定积木。
- 所有 `block_id`、`reference_id`、`action_id` 都能在当前配置的资源库中找到。
- 图片、音频和动作的媒体路径存在；动作的 color/depth 文件存在且 `pair_key` 一致；明确声明的用户待提供输入除外。
- `ref_image_0` 到 `ref_image_3` 与 Prompt Group 中的 Picture 1 到 Picture 4 顺序一致。
- API JSON 中的 prompt 与 Prompt Group 组合结果的非空文本行一致，允许存在由积木拼接产生的额外空行。
- 使用配置的 PromptStore 重新加载 group，确认 group 名称、数量、类型和资源引用仍然正确。
- 运行相关本地测试；默认不提交真实远程任务，不把“文件写入成功”误认为“远程生成成功”。

### 12.8 本例交付结果和后续替换规则

本例最终生成了以下三个本地文件：

- `data/workflow/wf_81a715c3011b/workflow_api.json`
- `data/workflow/wf_81a715c3011b/prompt_group.json`
- `data/prompt/groups/group-wf_81a715c3011b-inferred.json`

Prompt Group 共 17 项：1 个媒体输入、2 个人物参考、1 个动作参考、7 个固定积木和 6 个自由文本补充项。自由文本只负责对象定义、时间衔接和没有独立积木的字段内容，不替代真实媒体卡片。

当用户补齐首帧时，只需要同步替换：

1. API JSON 的 `13.inputs.image`。
2. registry 中的 `13:image.default`。
3. Prompt Group 和 sidecar 中首帧 `kind: "media"` 的 `media_path`、文件名和 MIME 类型。

替换后重新执行本节的资源路径、输入顺序、PromptStore 加载和 JSON 校验；不需要重新创建人物、解剖或姿态卡片。
