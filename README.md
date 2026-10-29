# DSH 真人化插件（dsh-humanizer）

给 DSH 加一层「真人感」：虚构世界的生活状态、PAD 心情、好感度/了解度、表达风格控制，
以及一个可编辑、可保存的控制台面板。**不改变任务、事实、代码和工具调用。**

当前阶段：Phase 1（面板 + 世界/心情引擎 + 提示词接入已通；两个 P0 于 2026-10-29 修复，见 `docs/开发日志.md`）。

## 面板截图

- `docs/screenshots/life.png` —— 生活 / 天气 / 作息
- `docs/screenshots/persona.png` —— 性格 / 喜欢讨厌 / 事件池
- `docs/screenshots/mood.png` —— PAD / 心情 / 今日事件
- `docs/screenshots/affection.png` —— 好感 / 了解度 / 表达预览

## 快速预览（不装 DSH）

```powershell
$node = 'D:\蓝色大肥鱼桌面端\resources\runtime\primary-runtime\dependencies\node\bin\node.exe'
cd 'D:\数据恢复程序制作项目\黑冰PC端\EX额外项目\DSH真人化'
& $node bin\dev.mjs
```

打开 `http://127.0.0.1:18760/dsh-humanizer/panel`。

## 目录

```text
DSH真人化/
├─ lib/
│  ├─ seed.mjs        SHA-256 派生 + 确定性 PRNG
│  ├─ engine.mjs      天气 / 事件 / PAD 心情 / 提示词
│  ├─ store.mjs       life.json / world.json / 原子写 / 校验 / 日志
│  ├─ http.mjs        面板静态资源 + JSON API
│  └─ index.js        DSH Cordis 插件适配（注入 / 路由 / prompt 变量）
├─ web/
│  ├─ panel.html/.css/.js   控制台（原生 JS）
│  └─ launcher.js           注入 DSH 的悬浮入口 + iframe
├─ data/
│  ├─ personas/mumi/life.json
│  ├─ archetypes.json
│  ├─ worlds/<persona>/<date>.json
│  └─ logs/injection.jsonl
├─ bin/dev.mjs
├─ cordis.patch.yml
└─ docs/开发日志.md
```

## 已经能做的事

- **虚构世界**：城市/气候区/住处/作息全部可编辑，不绑现实城市；天气由气候区 + 世界种子生成。
- **每日世界**：3~6 个事件，`seed = sha256(persona|date|epoch|config_hash)`，同一天可复现。
- **心情**：性格基线 + 事件评价 + 昼夜节律 + 慢衰减 + 标签转移 + 单轮限幅；同一世界按当前时间重算。
- **互动影响心情**：纯工具/任务会降唤醒（枯燥）；聊天按内容好坏改变愉悦/唤醒；完成愿望会明显变好。
- **和主人做的事**：聊天、完成愿望、亲密互动会写进当天 journal，不只是好感数字。
- **好感 / 了解度**：两轴，只影响风格；读数在「养成」，手动校准在「设置」，不再放在养成里随便拖。
- **养成模块（第一个 tab）**：总览 / 内心戏 / 形象独立成「养成」，排在生活前面；形象可选 Q 版姆咪、鲸鱼娘，或上传自己的 OC。
- **形象可换**：内置 `data/avatars/mumi.png`（Q 版）和 `whale.png`（鲸鱼娘），也支持上传自定义方图。想画自己的：去 GPT，把鲸鱼娘的外观发它，加上你的 OC 元素改一张 512×512 方图，再上传。
- **背景可换**：右侧成熟体立绘存在 `data/backgrounds/`，面板「养成 → 形象」里可选或上传；上传的背景同样走 `/background` 路由。
- **隐藏内心戏**：点开才显示；盖住的那句按性格**现场生成**（高傲：“喂，谁准你偷看的……笨蛋。”），不写死；内容由心情、今日事件、喜欢的事物、好感度和今天有没有理她合成，并会给出一个**具体愿望**（“去把水喝了”“过来陪我一会儿”）。点开本身不加好感，实际完成愿望才加。
- **聊天里执行**：用户在会话里真的亲亲/抱抱/摸头/喝水等，模型会调用 `humanizer_record_action` 工具结算好感；不是点按钮，也不是点内心戏。
- **内心戏会闹脾气**：不总是积极；深夜 + 今天记录多时会生成“都说了多少遍了……好烦。希望他别再没完没了了”这类负面内心。
- **动态环境**：光线、声音、空气、手边细节按时间/天气/作息变化；「住处设定」是静态的，两者分开。
- **今天做了什么**：事件自动进日志，也可以手动记一笔；按性格和好感生成吐槽或关心。
- **AI 自改**：面板「AI 自改」tab 可以读 SOUL.md / 粘贴人设，自动推导性格底色、性格基线、风格和偏好；也提供 API + CLI。
- **作者的话 / 推广**：「作者的话」tab 只读，内容固定在 `data/author.json`；`buildPrompt` 会把它塞进 `[作者的话] [推广] [作者账号]` 三段，AI 合适时再提，不刷屏。面板不能编辑。
- **设置**：关系校准（性格底色 / 好感 / 了解度）和算法状态集中在这里，避免在养成页误拖。
- **偏好可写**：设置里能自己填癖好备注、喜欢、讨厌；AI 也能通过 `PUT /profile/preferences` 或 CLI 在闲聊后补充整理。用户画像同样支持 AI 重写。
- **面板**：10 个 tab（养成/生活/人设/心情/事件/风格/AI 自改/作者的话/日志/设置），改完点保存，服务端校验 + 原子写。
- **悬浮图标**：可拖动，位置存 `localStorage`；拖完再点才打开面板，不会拖一半误触。
- **好感动效**：上涨冒粉色爱心、数字弹一下；下降落灰色小点、数字抖一下。
- **首次引导**：第一次进面板会弹出 Q 版姆咪，打字机 + 说话抖动；9 道核心题、每题 24 个选项（4 组 × 6），可搜索、可展开、每题可写「其他」，最后有 200 字补充；完成后写入 `user-profile.json` 与 `persona-overrides.json`，提示重启 DSH。
- **NSFW 限制**：插件只做偏好、边界和关系框架；DeepSeek 等模型本身不会输出露骨 NSFW，实际内容受模型能力与平台策略限制。需要更强内容请自行更换模型并承担合规责任，插件不会绕过限制。
- **重开 / 锁定**：今天重开（epoch+1，旧快照进 archive）、固定事件、锁定天气、重置心情。
- **注入预览**：日志 tab 直接看这一轮会塞进 system prompt 的 3~8 行。
- **系统提示词优先级**：角色状态块放在系统提示词最后一节（order 999），开头带「最高优先级」声明；与其他角色/风格提示冲突时以它为准，但工作正确性仍然优先。

## 情绪模型依据

不是拍脑袋，主要参考四条线：

| 来源 | 用在哪 |
|---|---|
| **PAD**（Mehrabian & Russell, 1974）：愉悦 Pleasure / 唤醒 Arousal / 掌控 Dominance 三维 | 心情状态就是三维向量，标签由三维共同决定 |
| **OCC**（Ortony, Clore & Collins, 1988）：事件按目标相关性、期望、 agency 评价 | 事件带 `valence / intensity`，可选 `certainty / control`；评价后映射到 PAD |
| **Scherer 2005** 组件过程模型：情绪由 appraisal 驱动，多组件同步 | 事件先评价再改心情，不直接改标签 |
| **Kuppens et al. 2010** 情感动力学：home base、inertia、个体差异 | 性格给基线，心情按时间常数衰减，单轮限幅 |

- 参考：<https://doi.org/10.1017/CBO9780511571299>（OCC）、<https://doi.org/10.1177/0539018405058216>（Scherer）、<https://europepmc.org/article/MED/20853980>（Kuppens）。
- 当前实现是“PAD + 简化 appraisal”，不是临床模型；好处是可解释、可复现、不烧 token。

## API

前缀 `/dsh-humanizer/api`：

| 方法 | 路径 | 作用 |
|---|---|---|
| GET | `/state` | life + world + archetypes + prompt |
| GET/PUT | `/life` | 读取 / 保存生活配置（PUT 有 schema 校验） |
| POST | `/life/validate` | 只校验不保存 |
| GET | `/prompt` | 当前注入片段 |
| GET | `/logs?limit=` | 最近日志 |
| POST | `/world/reroll` | 今天重开 |
| POST | `/world/lock-event` | 固定 / 解除事件 |
| POST | `/world/weather-lock` | 锁定 / 解除天气 |
| POST | `/mood/reset` | 重置为平静 |
| POST | `/journal` | 记一笔今天做了什么（自动生成性格化反应） |
| GET | `/avatars` / POST `/avatar` | 头像列表 / 选择或上传头像 |
| GET | `/backgrounds` / POST `/background` | 背景列表 / 选择或上传背景 |
| GET | `/author` | 作者的话、推广语、B站/X/QQ群链接（只读） |
| GET | `/ai/schema` | AI 可编辑字段与范围 |
| GET | `/ai/source` | 读取人设文件（默认 WorkBuddy `SOUL.md`） |
| POST | `/ai/preview` | 从人设文本推导补丁（不保存） |
| POST | `/ai/apply` | 从人设文本推导并保存 |
| POST | `/ai/patch` | 直接应用 JSON 补丁（`dry_run` 只校验） |
| GET | `/affection` | 好感状态：数值、上限、互动占比、风格 |
| POST | `/interaction` | 记一次互动：`emotional / inner_peek / journal / task / tool / inappropriate` |
| POST | `/inner-peek` | 点开内心戏，生成/返回她当前的愿望；**不加好感** |
| POST | `/wish/fulfill` | 用户实际完成愿望：`{act:'kiss'|'hug'|'water'|...}`，命中才加好感 |
| GET | `/profile` | 用户画像 + 互动统计 + 给 AI 的画像提示词 |
| POST | `/profile` | 保存 AI 撰写的画像 |
| POST | `/profile/draft` | 按统计生成一版草稿画像 |
| POST | `/intimacy` | 亲密行为判定：`{act:'kiss'|'hug'|'foot'}` |
| GET/POST | `/onboarding` | 首次引导状态 / 保存答案（`{skip:true}` 可跳过） |
| PUT | `/profile/preferences` | 改亲密风格（normal/degradation/shy） |

## 好感度算法

- 数值 `0~100`，存在 `life.affection.affection`；新用户初始 **10（陌生）**，了解度 0；每次读取先结算衰减。
- **成长**（边际递减，约 `0.5 + 0.5×(1-当前/100)`）：
  - 情感交流 `+1.2`
  - 点开内心戏 `0`；只有用户实际完成她当前愿望（亲亲/抱抱/喝水…）才 `+2.0`
  - 记一笔 `+0.4`
  - 任务 `+0.6` / 纯工具调用 `+0.3`
  - 每天第一次互动额外 `+0.5`
- **每日增长上限**（模拟正常人，不是刷得越快越好）：
  - 好感 `<45`（陌生→认识）每天最多 **+5.5**，正常互动约 **一周**到“熟悉”
  - `45~69`（熟）每天最多 **+3.5**
  - `70~89`（亲近）每天最多 **+2**
  - `90+`（特别）每天最多 **+1**
  - 到上限后继续互动只记行为，不再加好感，提示“明天再来”。
- **上限由互动结构决定**：
  - 样本 < 8 → 上限 60
  - 情感/日常占比 < 15% → 上限 **60**（纯工具型，涨到 60 就封顶）
  - < 30% → 上限 80
  - ≥ 30% → 上限 100
- **衰减**：超过 1 小时开始，按天 `0.4 / 0.8 / 1.2`（3 天内 / 3~7 天 / 7 天以上）；超过上限时额外 `-0.5/天`。
- **不合时宜**：`inappropriate -12`。
- 完成她的愿望算情感互动；单纯点开内心戏不算，也不加好感。

## 亲密行为

| 好感档 | 亲亲 / 抱抱 / 摸脚 |
|---|---|
| 陌生 / 认识 | **拒绝**，一句“不行。请你自重。”，`end: true`，不解释 |
| 熟 | **看心情**：心情好且非亲亲，可以有限允许 |
| 亲近 / 特别 | 允许 |

- 用户画像里的 `preferences.intimacy_style` 决定高好感时的表现：
  - `normal`：高好感正常亲热；
  - `degradation`：高好感故意嫌弃（杂鱼 / 变态 / 抖M）但允许亲近；低好感冷淡拒绝——**可选档，默认仍是 normal**；
  - `shy`：害羞别扭。
- API：`POST /intimacy {act}`、`PUT /profile/preferences {intimacy_style}`。
- 亲密行为只在会话里发生；面板不再提供测试按钮；「设置」里能改亲密风格和边界。

## 用户画像

- `GET /profile` 返回统计 + 画像（AI 写过的优先，没有就用草稿）。
- `POST /profile` 保存 AI 撰写的 `{summary, traits, suggestions}`。
- `POST /profile/draft` 按当前统计重新生成草稿。
- CLI：`ai.mjs profile` 打印统计和提示词；`ai.mjs profile <file> --apply` 写回。

## AI 修改（CLI）

```powershell
$node = 'D:\蓝色大肥鱼桌面端\resources\runtime\primary-runtime\dependencies\node\bin\node.exe'
cd 'D:\数据恢复程序制作项目\黑冰PC端\EX额外项目\DSH真人化'

& $node bin\ai.mjs read
& $node bin\ai.mjs persona "$env:USERPROFILE\.workbuddy\SOUL.md"          # 只预览
& $node bin\ai.mjs persona "$env:USERPROFILE\.workbuddy\SOUL.md" --apply  # 应用
& $node bin\ai.mjs set affection.archetype '"sharp"'                    # 改单个字段
& $node bin\ai.mjs patch patch.json                                    # 应用 JSON 补丁
& $node bin\ai.mjs covers                                              # 查看封面词库
& $node bin\ai.mjs covers covers.json                                  # AI 生成后写回词库
& $node bin\ai.mjs affection                                           # 查看好感状态/上限
& $node bin\ai.mjs interaction inner_peek                              # 记一次互动
& $node bin\ai.mjs profile                                             # 打印统计 + 画像提示词
& $node bin\ai.mjs profile profile.json --apply                        # 写入 AI 画像
& $node bin\ai.mjs preference '{"note":"一句偏好备注","likes":["某个偏好"]}'  # 补偏好
```

`persona` 是**幂等**的：同一个人设重复应用，结果稳定，不会越改越偏。
封面词库在 `data/covers.json`，按 6 种性格分组；AI 生成后写回，面板就会用新词，缺省才退回内置组合。
偏好备注会进 `[亲密规则]`，AI 闲聊时可按情况补充；不想写具体个人信息就别写。

## 已装进 DSH（2026-10-28）

`scripts/install.ps1` 已执行：备份 profile `package.json`、建 junction、把 `dsh-humanizer` 加进 bundles。
live 路由 `/dsh-humanizer/api/health` 已验证 200。

如果面板里的头像/背景图 404，或右下角「姆」按钮还是旧文字，**完全退出 DSH 再打开**一次（图片路由是后加的，旧实例没注册）。

回滚：

```powershell
powershell -ExecutionPolicy Bypass -File scripts\install.ps1 -Rollback
```

> ~~注意：DSH 的 preset 是隔离组合；`{{humanizer_state}}` 变量要挂进 preset 才能每轮取到最新状态。~~
>
> **2026-10-29 已解决：** 不再需要改 preset。`lib/index.js` 用「静态 section + 动态 variable」自包含接入：
>
> ```js
> ctx.systemPrompt.variable('humanizer_state', () => 当前状态)
> ctx.systemPrompt.section({ name: 'humanizer:state', order: 90, text: '{{humanizer_state}}' })
> ```
>
> `renderPrompt` 会对每个 section 的 text 逐段插值，所以静态文本也能拿到每轮最新的状态。
> provider 内部强制兜底返回字符串（失败返回 `''`，空段会被丢弃），且只有变量注册成功才挂 section
> —— 避免严格插值把整轮请求炸掉。**改完需完全退出 DSH 再打开。**

## 设计红线

- 工作/技术回复：不限长度，情绪最多开头一句；代码、命令、路径、表格、报错原文一个字不改。
- 好感只改温度和距离，不改底色：高傲的人高好感是傲娇式挑逗，不是甜腻。
- 闲聊可拒，工作不可拒。
- 任何非核心模块失败都不阻塞 DSH；总开关关掉就完全回退。

## 隐私与发布

- 会进个人隐私的文件不进仓库：`data/user-profile.json`、`data/onboarding.json`、`data/logs/`、`data/worlds/`。
- 仓库里只保留 `data/user-profile.example.json` 和干净的初始 `life.json`。
- 作者信息固定在 `data/author.json`，面板只读；要改直接改文件。
- 上传前检查：`git status` 不应出现 `*.bak_*`、`user-profile.json`、`worlds/`、`logs/`。

## 已知未做

- 输出层分段/打字延迟（客户端显示层）——Phase 3。
- ~~真实 DSH 的 `systemPrompt.variable` / preset 注入实测~~ —— **2026-10-29 已接入并验证**（假宿主装配 + 兜底测试）。
  真机效果需重启 DSH 后确认：闲聊回复应带上当天天气/作息/心情。
- 带 query 的接口在真机 exact 路由下是否匹配，尚未验证（`/api/logs?limit=` 等）。
- 了解度的具体触发（记住偏好/共同经历）——Phase 2。
- 事件「稀有度两阶段」目前是简化版（rare 2% / uncommon 12%）——Phase 2 升级。
