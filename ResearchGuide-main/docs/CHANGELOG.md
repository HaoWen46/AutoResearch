# CHANGELOG · 需求与文档变更日志

> **这是所有变更的唯一事实源。** 规则见 DOC_SYNC §1–2：改文档必须在这里追加条目；
> 每个 AI 开发会话开始时 agent 必读本文件并提醒用户新变更。
> 条目格式：`## [日期] [类型] 标题` + 变更内容 / 影响文档 / 影响模块 / 决策来源 / 登记人。

---

## [2026-10-10] [FIX] Codex 四轮复查：权限、预算、注入、并发写、可用性、数据正确性

- 变更内容：Codex（gpt-6-astra）对 #16/#17 和全站做了四轮审查，逐条复现后修掉。权限：uid 核对不再看 Content-Type 大小写；微信只认安全模式、同一条消息不能配两次登录、猜数字先查限额。预算：模型调用按人/按全站每天封顶，访客、没同意隐私说明的、匿名接口不调（budget.py）。注入：前端所有 innerHTML 先消毒，几处模型/用户文本逐处转义。并发：同一个人的改动一件一件来（userlock.py，异步等锁、每人排队上限），流式对话在自己的线程里跑完再放锁；删号后在路上的请求写不回来（墓碑 + 触发器）；评阅记录按当时的画像。可用性：MCP 不卡事件循环，论文抓取有上限、没人等的就取消，/api/papers 要登录。数据：成绩单按学期替换、「不及格」保留、半学分照算、无穷大学分拒收并修老库；改方向换键而不是换标签；替换写入新来源和可信度；重复结论和重复卡都对账；任务反馈存库；导出在一个读事务里。前端：换人整页重载、草稿按人存、只在明确退出时清；对话页晚到的渲染不覆盖别的页。
- 影响文档：docs/DEPLOY.md、docs/CHANGELOG.md、.env.example
- 影响模块：server/auth.py、server/budget.py（新）、server/userlock.py（新）、server/envfile.py（新）、server/wechat.py、server/store.py、server/main.py、server/llm.py、server/memory.py、server/reading.py、server/workbench.py、server/transcript.py、server/dialogue.py、server/singleflight.py、web/js/app.js、web/js/chat.js、tools/backup_db.py、tools/verify/verify_receipt_render.js、server/tests/
- 决策来源：陈浩文（上线前让 Codex 按「真的会有人用」来挑错）
- 登记人：陈浩文

## [2026-10-10] [FIX] 多人同时用：流式对话有总时限和封顶、关思考；线程池 40 → 128；库在临时盘上会报出来

- 变更内容：`llm.chat_stream`（对话页用的流式调用）原来直接 `urlopen`，没有总时限、没有 `max_tokens`、没对 DeepSeek 关思考——每个对话默认开着思考（贵、慢），一个一直吊着不结束的流能占住一个工作线程不放。现在走 `limits.stream`（和 `fetch` 一样：总时限 `LLM_TOTAL_SECONDS`、空闲时限、字节上限），带 `max_tokens=2000` 和 `thinking: disabled`。Starlette 工作线程池默认 40 个，同步接口和流式对话各占一个直到做完，四十个学生同时对话第四十一个人就排队：启动时调到 `QIYAN_THREADS`（默认 128）。`store.ephemeral()`：库在 `/tmp` 下、或在函数计算上没设 `QIYAN_DB`，`/api/health` 报 `db.ephemeral: true` 并在启动日志里警告——线上现在就是这样（10-08 的记录：SQLite 写 `/tmp`），实例回收会丢掉所有账号和记录。`/api/health` 另报 `threads`。
- 没改的（要换部署才能解决）：函数计算多实例时每个实例各有一份库和一份内存状态（会话、微信登录的数字、限频、去重缓存），登录会在实例之间来回失效。要么单实例 + NAS，要么换一台常驻机器跑 Docker 镜像，见 docs/DEPLOY.md。
- 影响文档：docs/CHANGELOG.md、.env.example
- 影响模块：server/limits.py、server/llm.py、server/main.py、server/store.py、server/tests/test_concurrency.py（新）
- 决策来源：陈浩文（多人同时用会出什么事的自查）
- 登记人：陈浩文

## [2026-10-09] [FEAT] 账号：微信登录（关注公众号发数字）、访客绑微信、删号与导出；库路径读 QIYAN_DB

- 变更内容：原来「登录」只是起个昵称，每次都开新号；uid 是唯一凭证，知道别人的 uid 就能读他的成绩单和对话；`users.token` 生成了但从没校验。现在：微信登录——网页给一个 6 位数字，学生关注公众号把数字发过去，网页轮询到了自己登进去，没注册过的微信自动注册。走个人订阅号的「服务器配置」收消息（网站扫码登录要企业认证和备案域名，个人拿不到），只存公众号给的 openid，不存手机号、不用密码。访客可以先用，之后在「记录」页绑微信，数据跟着走。会话三十天不用才过期，库里只存令牌哈希。所有接口默认要登录（公开的写在 `server/auth.py` 的 `PUBLIC`），请求里带的 uid 必须是本人；`GET /api/tasks/{tid}` 补上归属校验。「记录」页加账号块：隐私说明、导出全部数据、退出、删除账号（真删每张带 user_id 的表）。首次进入要同意隐私说明，说明改了会再问一次。有账号之前的老用户凭浏览器里的 uid 自动认领一次。`store.DB_PATH` 读 `QIYAN_DB`（Dockerfile 早就设了，代码没读，重建容器会丢光用户）。加 `tools/backup_db.py` 在线备份。界面版本跳到 w60：w35–w38 线上用过、PR #15 到了 w53，同号会让浏览器拿到旧缓存。
- 影响文档：docs/DEPLOY.md、docs/CHANGELOG.md、.env.example
- 影响模块：server/auth.py（新）、server/wechat.py（新）、server/store.py、server/main.py、web/js/app.js、web/js/chat.js、web/css/styles.css、web/index.html、tools/backup_db.py（新）、server/tests/test_auth.py（新）、server/tests/conftest.py（新）
- 决策来源：陈浩文（真实用户上线前：要能找回自己的数据、别人读不到；登录用微信）
- 登记人：陈浩文

## [2026-10-09] [OPS] 补容器与测试环境，对齐部署课

- 变更内容：`ResearchGuide-main` 根目录增加 `Dockerfile` / `docker-compose.yml`。开发用 8100，测试用 8101。云上另部函数 `qiyan-test`，不当生产首页。生产仍是 GitHub Pages + 函数 `qiyan`。没有备案域名，不开 ECS。`docs/DEPLOY.md` 写清三套环境和回滚。
- 影响文档：docs/DEPLOY.md、docs/CHANGELOG.md
- 影响模块：Dockerfile、docker-compose.yml、tools/deploy/deploy_fc.py
- 决策来源：邬程灿（产品部署要求）
- 登记人：助手

## [2026-10-08] [OPS] 默认函数域名会下载网页，改走 OSS 站点打开

- 变更内容：`*.fcapp.run` 会在网关加 `Content-Disposition: attachment`，浏览器就下载 htm。页面改到 OSS 静态网站打开；接口仍走函数计算。前端加 `QIYAN_API` / `apiUrl`，同域时为空。函数计算放开 CORS。界面版本 w38。
- 影响文档：docs/CHANGELOG.md
- 影响模块：web/index.html、web/js/app.js、web/js/chat.js、server/main.py、tools/deploy/
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-08] [OPS] 杭州函数计算公网发布

- 变更内容：当前产品发布到阿里云杭州函数计算（`custom.debian12` + 匿名 HTTP）。按量 ECS 因帐号后付费门槛未开成，所以走按请求计费。公网地址 `https://qiyan-caxplsowco.cn-hangzhou.fcapp.run`。模型走函数环境变量里的 DeepSeek。SQLite 写 `/tmp`，实例回收会丢本地库。密钥只在本机 `.env` 和函数环境变量，zip / `.deploy.env` / `vendor_wheels` 不入库。`arxiv` 条目 URL 先算出 id 再拼，兼容镜像上的 Python 3.11。
- 影响文档：docs/CHANGELOG.md
- 影响模块：tools/deploy/、server/arxiv.py、server/store.py
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-07] [UX] 收掉 AI 口吻，五个房间首屏对准大一痛点

- 变更内容：用户可见文案去掉「问答画像 / 先聊五个问题 / 此刻最值得做的一件事 / AI Research Mentor」这类口吻。今日、作业、项目、研读、定位的页头改成大一会问的那一句。侧栏五栏、粒子首页、右上角画像和方向不动。页脚只留课名来源。品牌小字改成「本科生进科研」。不改 REST。
- 影响模块：web/index.html、web/js/app.js、web/js/chat.js、web/css/styles.css、docs/CHANGELOG.md
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-06] [UX] 对话和记录收进用户菜单，侧栏只留五栏

- 变更内容：回到备份那一版的粒子首页。侧栏改为今日 / 作业 / 项目 / 研读 / 定位。「任务」改称「作业」。对话、画像、记录不再占侧栏：右上角是当前方向和用户名。点方向进方向树；点用户名弹出画像管理，可切换 / 新建画像，并进入对话、核对或记录。第一次登录仍先进对话。不改 REST。
- 影响模块：web/index.html、web/js/app.js、web/js/chat.js、web/css/styles.css、docs/CHANGELOG.md
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-06] [UX] 侧栏按进度展开，今日只推一件事

- 变更内容：新用户进门不再并列八个工作区。登录文案改成「先聊几句，再给下一步」。已登录刷新后直接回今日，不再掉回六屏首页。侧栏按进度长出来：先是今日 / 对话；聊出事实后出现方向和记录；选定方向后出现任务；交过任务或对话派了任务后出现项目；有方向且开始做事之后才出现研读和定位。今日去掉「先聊五个问题」的过期口径，每日情报也等研读房间打开再出现。首页第一屏就能开始，不必滑完六屏；登录页不再把「连接模型」和进门并列。核对页改成和对话同一块页头，字段清单默认收起。方向页先给最多三个建议卡片，教程标签等确认方向后再出现。页脚版本戳缩短。不改 REST。
- 影响模块：web/js/app.js、web/index.html、web/css/styles.css、docs/CHANGELOG.md
- 决策来源：邬程灿（用户走查：入口太满、没有一条主流程）
- 登记人：助手

## [2026-10-05] [BUILD] 默认北大（不问学校）+ 说到院系简称时先查库

- 变更内容：用户给了一段实测对话——第一句「我是信管的大二学生」，系统答完一句评价后反问「你是哪个学校的？」；第二句「帮我查一下信管的专业方向」才去查库。两个问题都在这一版修掉。
  - **默认北大**：产品只服务北大学生，学校是默认前提而不是待填的空。`memory.COVERAGE_GROUPS` 的 `school` 改成 `Slot(presumed="北京大学")`（核对页显示为已填、标注默认），`LADDER_PROBE["identity"]` 去掉 `school`，系统提示词明确「默认他就是北大学生，不要问『你是哪个学校』」，他若自己说起别的学校则如实说知识库只覆盖北大培养方案。
  - **身份层漏判**：`LADDER_PROBE["identity"]` 原本只有 `grade/school/major/enroll_year`，**没有 `department`**——「信管大二」把年级和院系都答了，这层仍被判成空着，模型于是接着问一个已经答过的问题。补上 `department`。
  - **说到名字就先查**：新增 `tools.kb_env_facts(uid, message)`，组装环境包时用 `curriculum.mentions()` 找出这句话里出现的库内院系/专业名，**代码先把培养方案原文事实查好**放进 `env["lib_facts"]`（只读、有界：最多 2 个名字 × 4 张卡 × 6 门课，带来源页），并随 `_env_for_prompt` 进入两次模型调用。这是「代码组装环境、模型决定怎么用」，与按层召回记忆同一个模式。
  - 规则版（未配模型）也认这份事实：`_degraded_proposal` 在有 `lib_facts` 时直接报出该院系的专业名单，不再答一句与这句话无关的「先看看你想往哪个方向走」。
  - 提示词补一条引用纪律：**只写库内事实真的写了的东西**（实测模型把只出现在两个专业清单里的《数据库系统》说成「三个方向都有」）；并明确 `school` 只有在他说出北大以外的学校时才写。
- 影响文档：docs/DIALOGUE_CONTRACT.md §3.1.1 + §4（环境包新增 `lib_facts`）、docs/DEPARTMENT_KNOWLEDGE.md §4.6、docs/CHANGELOG.md
- 影响模块：server/memory.py、server/tools.py、server/dialogue.py、server/tests/test_dialogue_libfacts.py（新增 11 条）
- 验证：真模型跑用户那段对话——「我是信管的大二学生」→ 环境包已有 3 个专业名单，回复「你们系三个方向……这学期哪门课你会额外花时间」，**没有再问学校**；「帮我查一下信管的专业方向」→ 三专业 + 学分 + 核心必修课 + 来源页 p378/p387/p396 + 分流以教务为准；「哪个更适合做数据」→ 按必修清单比较且不再把《数据库系统》说成三门共有。三轮 `degraded=false`。
- 决策来源：用户实测反馈（默认北大；「信管」这种简称应该去查数据库，什么时候用库要更准）
- 登记人：助手

## [2026-10-05] [BUILD] 对话 agent 接上院系-专业知识库（问「信管有哪些专业分流」不再答「我没有这个工具」）

- 变更内容：产品内对话问「信管有哪些专业分流」，回复是「我手上没有能检索北大培养方案的工具」——知识库与 MCP 都在，只是没挂进对话的工具 registry。现在把 5 个知识库工具（`major_lookup` / `major_detail` / `match_transcript` / `minor_programs` / `course_lookup`）挂进 `server/tools.py`，**定义只有一份**（`mcp_curriculum.TOOLS`，MCP 与对话共用，`curriculum.py` 是唯一查询层）。
  - 查询层新增：按院系查（「信管」简称表 `DEPT_ALIAS` + 官方名 → 该院全部专业，这才是「有哪些分流」的答案）、`mentions()`（模型把整句当 query 时从原话里抠库内名字）、`codes_for_names()`（课名 → 课号确定性反查，因为北大成绩单只有课名）、未命中时的 `COVERAGE_NOTE`（医学部/深研院/软微不在库里，别把「库里没有」说成「北大没有」）。`mcp_curriculum` 拆出 `run_tool()` 供对话复用，MCP 的 `isError` 语义不变。
  - 对话层：系统提示词补「专业/分流/培养方案/必修课必须调工具，不许说没有工具」与 `tool_intent` 的形状；`_clean_proposal` 收敛字段名同义写法（`name`/`tool_name` → `tool`，`arguments` → `args`）——实测模型写成 `{"name": ...}`，导致整轮被判无效输出而降级；降级模板 `_tool_fallback_reply` 认知识库结果形状（`命中`/`院系排名`），不再误报「没有合适的结果」。
- 影响文档：docs/DIALOGUE_CONTRACT.md §5、docs/DEPARTMENT_KNOWLEDGE.md §4.6、docs/ARCHITECTURE.md §5
- 影响模块：server/curriculum.py、server/mcp_curriculum.py、server/tools.py、server/dialogue.py、server/tests/test_tools_curriculum.py（新增 20 条）
- 验证：真模型跑三问——「信管有哪些专业分流」→ 调 `major_lookup` 回三个专业 + 学分/核心课 + 「名额以教务为准」；「必修课与学分」→ 调 `major_detail` 出席 p396 的 16 门必修课；「学过的高数B/线代B/计算概论A像哪个院系」→ 调 `match_transcript`（课名反查 3 个课号）并如实说公共课认不出院系。三问均 `degraded=false`、`fabrication_risk=false`。
- 决策来源：用户实测反馈（对话不能调用数据库）
- 登记人：助手

## [2026-10-05] [BUILD] 院系-专业知识库（199 专业卡）+ 查询接口 + MCP 服务

- 变更内容：从《北大本科培养方案（2026）》文科卷/理科卷与《辅修双专业培养方案（2025）》抽出结构化知识库：`knowledge/curriculum/`（199 张专业认知卡、198 份培养方案、13k 课程、1077 门被必修课、课号前缀归属 43 个）与 `knowledge/minor/`（98 条辅修/双专业，含替代课程）。定位逐条由模型蒸馏成 ≤40 字并抽检。查询层 `server/curriculum.py`（只读 JSON、不联网、不调模型）：四层检索（主键 → 别名 → 子串 → 近似）、成绩单课号认院系/专业（与留一验证同一 F1 口径，返回「还缺哪几门」）、专业簇与同院兄弟专业、课号反查。接口 6 个（ARCHITECTURE §5）；同一套工具表另有 MCP 服务 `server/mcp_curriculum.py`（stdio 与 streamable-http 两种传输）。留一验证：院系级 Top-1 100%（三种口径）、专业级 Top-1 89%/91%、Top-3 99%。
- 影响文档：docs/DEPARTMENT_KNOWLEDGE.md、docs/ARCHITECTURE.md §5、docs/curriculum_validation.md、docs/curriculum_intros_review.md、docs/curriculum_minor_review.md、README.md
- 影响模块：knowledge/curriculum/、knowledge/minor/、tools/curriculum/（抽取与校验脚本）、server/curriculum.py、server/mcp_curriculum.py、server/main.py、server/tests/test_curriculum.py、server/tests/test_mcp_curriculum.py
- 决策来源：任务表（知识库 / 院系-专业认知）
- 登记人：助手

## [2026-10-05] [MERGE] 任务 2 对话 agent 合回开发线

- 变更内容：把 `feat/dialogue-agent`（任务 2：对话内核「模型决策、代码裁决」、记忆分层与三道闸门、成绩单与绩点、对话↔任务区、SSE、evaluation）合并到本轮开发线。冲突只出现在 7 个文件：`server/main.py`（import 取并集）、`server/store.py`（两边的表与函数都保留，`edges.ref` 走统一 `_MIGRATIONS`）、`web/index.html`（导航取并集：今日 / 定位 / 研读 / 对话 / 方向 / 任务 / 项目 / 记录，版本戳推到 w33）、`web/js/app.js`（**任务区统一到 `taskPanel`**：对话给的任务和树上任务共用一套面板，树上任务多传「路径步骤说明」与「填入演示示例」，完成后的去处由 `onDone` 注入）、`README.md` / `docs/ARCHITECTURE.md` / `docs/CHANGELOG.md`（两边内容取并集）。
- 影响模块：server/main.py、server/store.py、web/index.html、web/js/app.js、README.md、docs/ARCHITECTURE.md
- 说明：合并后 `画像` 视图由任务 2 的「对话 / 核对」两个标签取代（`case "onboarding"` 不再存在）。合并当时 `python -m pytest server/tests` 共 406 条：405 通过，唯一失败是 `test_perf.py::test_deadline_covers_slow_response_headers`（本机让 127.0.0.1 的慢响应头卡约 4.7 秒，断言 <1.5 秒）——同一条在合并前的 `3318243` 上也一样失败，与本次改动无关。（本文件更上面的条目改完后为 417 条，416 通过，唯一失败仍是这一条。）
- 决策来源：本轮开发线整合
- 登记人：助手

## [2026-10-04] [BUILD] 教程蒸馏改为流程树（主干 + 有据才分叉）

- 变更内容：`tutorial-distill` 不再强制 6 步直线。输出 `tutorial-tree-v2`：共用主干，仅当大纲把后面写成并行课/选修轨时才分叉；同一关的两种交卷方式写在 `task.alternatives`。每个节点必须有 `learn` / `task` / `resources`（原链接 + 这一页干什么）。样例：人工智能 `520.20`（卷积 | Transformer）、计算机软件 `520.40`（OS | 编译 | 数据库）。`preview.py` 打 mermaid 和节点卡片。其余 JSON 仍是旧 6 步，校验兼容，等确认后再重跑。未接入 `directions.js`。
- 影响模块：skills/tutorial-distill/、knowledge/tutorials/520.20.json、knowledge/tutorials/520.40.json、skills/README.md、knowledge/tutorials/README.md
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-03] [DOC] 产品设计提案 v2（HCI）
- 变更内容：新增 `docs/DESIGN_PROPOSAL.md`。判断：学东西越来越便宜，技能和知识不再是瓶颈，学生要赢靠的是用自己的边去差异化。所以主价值是定位与博弈层（§1D：边清单 → 竞争地图（需求 / 供给 / 势头，k≥5、按档、滞后）→ 生态位与定位陈述「我是能做 X 的人，因为 Y」→ 信号表 → 时机 → 冲 / 稳 / 保下注组合，并防羊群）；研究思维层（阅读卡 → 综合矩阵 → 问题阶梯 → 提案画布 → 最小测试）是降成本的引擎、也是边的原材料。节奏分层：每日 ≤10 分钟（arXiv 新论文分拣、雷达变化、一次定位微调），重活按周。双窗口：学生自己的 Agent 是手，启研是地图、标准和账本。IA 五标签：今日 / 定位 / 研读 / 机会 / 作品。按天排期，含验证计划（「Agent 单独 vs Agent + 启研」对照）。是提案，不改代码与契约；采纳哪些在群里定。
- 影响文档：docs/DESIGN_PROPOSAL.md（新增）、docs/README.md
- 决策来源：陈浩文
- 登记人：助手

## [2026-10-03] [BUILD] 方向教程蒸馏 Skill（检索公开大纲，不编步骤）

- 变更内容：新增 `skills/tutorial-distill/`：输入一个方向，检索大学大纲/公开教材，蒸馏成 6 步并写入 `knowledge/tutorials/{id}.json`。不够 2 个独立来源就标 `insufficient`。附 `validate.py`。烟测 3 条：人工智能 `520.20`（MIT 6.390 + MML）、系统结构 `520.30`（MIT 6.004 + Berkeley 61C）、基础医学 `310`（OpenStax A&P 2e + MIT 7.01SC）。尚未接入 `directions.js`。
- 影响模块：skills/tutorial-distill/、knowledge/tutorials/、skills/README.md
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-03] [BUILD] 方向树与教程同一页切换

- 变更内容：方向区默认是一棵 GB/T 策展学科树（计算机 / 数学 / 心理 / 经济 / 基础医学），统计挂在数学下，医学只做基础医学；三级只留热门切口。同一页用按钮切到教程，顶部写当前方向名，教程随选中的方向变。原有数学、人工智能、认知、经济、统计、系统教程挂到最近的二级；每个二级另有自己的 6 步教程，系统结构不再共用机器学习树。基础医学补了 6 步路径（`docs/paths/基础医学.md`），后两步不预写论文篇名。后端方向目录增加 `med`，任务/项目仍走原有方向代码。
- 影响模块：web/js/directions.js、web/js/app.js、web/css/styles.css、web/index.html、server/planner.py、knowledge/build_paths.py、knowledge/paths.json、knowledge/direction_tree.json、docs/paths/基础医学.md
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-03] [FIX] 点老师名能打开老师页
- 变更内容：老师页原先叠在节点页下面（z-index 更低），看起来像点不进去。老师页提到节点页上面，并加「返回」。老师名改成真正的按钮。
- 影响模块：web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-03] [FIX] 模型设置只许管理员改；DeepSeek 默认关思考、输出封顶
- 变更内容：`POST /api/llm/connect` 原来任何访客都能调用，可以换掉服务器的密钥，或把所有模型请求转到任意 https 地址；现在设了 `ADMIN_TOKEN` 就要带 `X-Admin-Token`，没设只许服务器本机。「连接模型」弹窗多一个可选的管理员口令。写 `.env` 改为只改三行，不再冲掉别的配置。默认模型改为 `deepseek-flash`（DeepSeek 的 /models 只剩它和 `deepseek-v4-pro`，`deepseek-chat` 已列入停用，目前仍被路由到 flash 非思考）；flash 默认开思考，对 DeepSeek 显式关掉（设了 `LLM_REASONING_EFFORT` 则不关）；每次请求 `max_tokens` 默认封顶 2000。
- 影响模块：server/main.py、server/llm.py、web/js/app.js、.env.example、server/tests/test_llm_guard.py
- 决策来源：陈浩文
- 登记人：助手

## [2026-10-03] [FIX] 性能与资源上限（Codex 审出的七处）
- 变更内容：①交成果的评阅（解压、规则、模型、写库）移出事件循环，进 2 个线程的评阅池，同时排队最多 6 个，满了回 503；②上传边收边数，超过 20 MB 立刻 413，不再先整包读进内存；③.docx 里的 word/document.xml 先看大小和压缩比、读时再截断（8 MB），每个文件解码后最多留 40 万字符；④README 里找文件路径改成线性扫描（64 KB 不到 1 毫秒，原来 16 KB 要一秒），结果与原正则一致；⑤并发的相同请求只打一次上游：arXiv 元数据 / 计数 / 全文、项目来源的 HTTP、北大课程检索（新增 `server/singleflight.py`），`discipline-map/server.py` 也加了十分钟缓存和并发去重，不再每次都起 uv；⑥项目检索改用全站共用的 8 线程池，排队排过截止时间的不再打上游、直接用快照，超时时还没开始的任务取消；⑦阅读卡、定位陈述的「最新一版」查询加带 version 的索引（2 万行从约 0.9 秒到约 20 毫秒）。
- 第二轮（Codex 复审又找出七处）：①相同的论文请求不再各占一个工作线程干等：论文正文、每日情报、交阅读卡改为在事件循环里共等同一个结果（`AsyncFlight`），四十个相同请求时 `/api/health` 照常返回；项目检索在提交任务前就合并相同来源，不再提交只会干等的任务，快来源不会被挤到超时；②外部请求有总时限和字节上限（arXiv、项目来源；新增 `server/limits.py`），慢慢滴数据的服务器拖不住；③上传和评阅分开计数，上传有 60 秒总时限，卡住的上传不再占光评阅名额；④竞争地图的组合稀有度改为两条批量查询（一千人从两千次查询到几次）；⑤一张卡里的引文定位和分节对同一篇论文只预处理一次；⑥arXiv、项目来源、课程检索的内存缓存过期即删、有条数上限；⑦「找项目」按回车不再绕过忙碌状态重复检索。
- 第三轮（Codex 再审六处）：①.docx 去标签改成线性扫描（正则不释放 GIL，放在线程里也会拖住整个服务；66 KB 畸形文件原来 2 秒）；②每日情报把共享的 arXiv 结果或失败原因作为参数交给后续步骤，arXiv 不通时不再每个请求各占一个线程重试，失败结果三十秒内复用；③外部请求的总时限覆盖连接、TLS 和响应头（看门狗到点关 socket），arXiv 限速锁最多被占 timeout 秒；④矩阵冲突按指标分组，每边列前 5 篇另给总数，不再逐对展开；⑤定位陈述的需求统计先按人取截止前最大版本再连回去（1.8 万行修订 3 毫秒）；⑥压缩包在打开前先从目录尾记录查条目总数（含文件夹）和中央目录大小，十万个空目录不再先建十万个对象。
- 第四轮（Codex 四审五处）：①模型调用也走同一套总时限和 2 MB 回复上限，卡住的模型服务不能无限占着评阅线程（超时不重试）；②域名解析放进小线程池限时等，socket 在连接之前就登记（登记的是副本，TLS 包装后照样能到点关掉），解析、连接、握手都在总时限内；③zip64 记录按 zipfile 的方式找（紧挨定位记录之前），前面拼接数据也能核对；有目录尾却核对不了的直接拒收；④竞争地图的需求统计先按陈述指向计数一次、成员判断用集合（一万人从约 0.4 秒到几毫秒）；⑤矩阵每行带完整的「是否在冲突里」标记，高亮不再只看每组前 5 篇的预览。
- 第五轮（Codex 五审五处）：①课程检索也改成在事件循环里共等一个结果，相同检索不再各占一个工作线程；②同一主机的域名解析共用正在进行的那一次，一个解析很慢的主机最多占一个解析线程；③压缩包里的纯文本只读开头（够截出上限即可），每个文件读完立刻截断再存，不再整份解压、整份解码攒到最后；④组合稀有度先把每个同学压成「和我重合的边」的位图、相同位图合并后再数组合（120 条边 × 5000 人在 0.5 秒内），只返回最少见的 20 组另给总数；⑤arXiv 只拿到摘要时记下重试时间：确实没有 HTML 版隔一周，临时失败（超时、断网、5xx）十分钟后再试，不再把半份论文永久缓存。
- 第六轮（Codex 六审四处）：①域名解析记着有几个请求在等，最后一个等的人超时走了就取消还在排队的解析，过期的活不再占住线程；②响应提前断开（收到的少于声明长度，或正文页尾没有 </html>）当作网络错误，不会把半份论文当成正文永久缓存；③到期的摘要版只重试正文、沿用已有的标题和摘要，刷新失败照样返回缓存并按临时失败退避十分钟；④组合稀有度改为每条边一个「哪些同学有它」的位集，一对边的人数用按位与后数 1 得到（每人 60 条重合边、5000 人在 0.5 秒内）。
- 第七轮（Codex 七审三处）：①notebook 不再用 json.loads 把输出全建成对象：结构简单的照旧解析，复杂的按记号线性扫描，只取每个单元的 source、只看 outputs 是否为空（十五万个输出对象时峰值约 8 MB，原来七八十 MB）；②同一篇论文的引文索引在并发提交时只建一次（缓存加并发合并，二十四张卡同时交只建一次）；③组合稀有度逐行读同学的边（只选需要的列、用元组），边读边置位，不再先攒几十万个行字典（5000 人 × 60 条边约 0.3 秒、峰值约 3 MB）。
- 第八轮（Codex 八审四处）：①②notebook 去掉自写扫描器（没闭合的字符串会让它退化成平方时间，还会放过语法错误），改回标准库 json 并加钩子：非单元对象解析完立刻换成占位、数字一律解析成 0，语法照旧完整校验，坏文件判不合格；十五万个输出对象约 0.1 秒、峰值约 10 MB；③交阅读卡前在事件循环里共等「取原文 + 建引文索引」，四十张卡同时交同一篇论文时评阅线程不再干等；④组合稀有度的规范化缓存最多记 4096 条，各不相同的描述不再全攒在内存里。
- 自查修复（十处）：
  - 论文缓存先写临时文件再原子替换，坏文件当作没有缓存；
  - 共享的活按种类分开线程池（arXiv、建索引、课程检索），等 arXiv 限速锁的不再拖住别的；
  - 模型调用改为「多久没数据」加 150 秒总时限，DeepSeek 排队时发的空行不再被当成卡住；
  - 上传改为「20 秒没数据」加 5 分钟总时限，慢网也能交完；
  - 共享的项目来源任务按所有等它的检索里最晚的截止时间算；
  - 引文索引按总字数（八百万字）留，几篇论文同时交卡时不会在评阅前被挤掉；
  - 性能测试的计时门槛加宽，模拟的阻塞拉长，在慢的 CI 机器上也稳；
  - 刚读过的论文在内存里留一分钟，一次交卡不再从磁盘读三次；
  - 一个看门狗线程管所有请求的截止时间（不再每个请求一个 Timer 线程），并加测试守住依赖的 http.client 内部细节；
  - 压缩包中央目录上限提到 1 MB，超了单独说「文件名太大」。
  - 另修一处：看门狗到点关掉 socket 后，没声明长度的响应会被当成正常读完，现在判为超时。
- 第九轮（Codex 九审三处）：①notebook 解析前按字节数限额（8 MB、约 15 万个 JSON 值），超了不解析、提示清空输出再交；钩子只留顶层和单元，带 source 键的输出也丢掉（限额以内最坏情况峰值约 30 MB）；②引文定位按「一个字加组合符号」逐段规范化并记原文位置，连字、全角字符不再让位置错开、把引言报成局限段；③每人最近一次检索结果改用两小时过期、最多 2048 人的缓存。
- 第十轮（Codex 十审三处）：①论文正文、每日情报、交卡在缓存命中时直接给，不进 arXiv 线程池排队（原来四个慢的取数占满线程时，已缓存的论文也得等）；②太大没解析的 notebook 不再按正则猜「有输出」，不给分，并提示把结果导出到 results/；③引文和论文的规范化走同一条逐字流程，每个产出的字都带原文位置（「İ」转小写是两个字、分开写的韩文字母会合并）。
- 影响模块：server/main.py、server/submission.py、server/arxiv.py、server/project_adapters.py、server/pku_adapter.py、server/projects.py、server/store.py、server/singleflight.py（新增）、server/tests/test_perf.py（新增）、discipline-map/server.py、server/limits.py（新增）、server/quotes.py、server/positioning.py、server/reading.py、server/llm.py、web/js/app.js、server/tests/test_projects.py
- 决策来源：陈浩文（Codex 审查）
- 登记人：助手

## [2026-10-03] [BUILD] 研读层与定位层的第一条纵切片（设计提案 §1C、§1D）
- 变更内容：新增两个工作区。「研读」：领域工具包「大模型评测与基准」（10 篇 arXiv 论文、7 个 GitHub 数据集、11 条逐字核对过的作者自述开放问题、7 个矩阵维度）；阅读卡工作台左边是 arXiv 正文（可按节跳转、选中原句一键引用），右边 7 栏，引文必须逐字出自原文、局限必须出自局限 / 讨论 / 结论段，「主张 / 假设 / 我会改什么」不能抄原文；可下载 AGENTS.md 交给学生自己的 Agent，并在决策日志里逐条表态；三张卡过线后出综合矩阵，空格、空列、方向相反的冲突由规则标出。「定位」：边清单（已证明的从账本自动导入，自述的自己加，含「信息源」一类）、竞争地图（需求只数有投入的人、滞后一周、k≥5、池子不够写「数据不足」；供给如实写「未知 · 去问」；势头用 arXiv 近 12 个月相对分类整体的增长，离线算好写进工具包；不提供冷门排行）、定位陈述「我是能做 X 的人，因为 Y」的规则检查（不打分）、冲 / 稳 / 保 下注组合（最多 3 个，集中风险提示），以及信息源地图（`knowledge/channels.json`：六个方向加进组信息共 90 个信息源，中文圈 / 英文圈并列，写明信号、具体偏差、频率与可达性，5 条标「未核实」；学生标「我常看」成为一条边，并看到自己那一圈之外的盲区）。学生的方向还没有工具包时如实说明，并指向信息源。「今日」多一块每日情报：分拣几篇当天 arXiv 新论文（留 / 过 + 一句理由）和至多一句定位微调。全部规则判定，不调用模型。
- 修复：arXiv HTML 正文只取 `<article>`，不再混进横幅和反馈弹窗；公式保留 TeX。
- 影响模块：server/arxiv.py、server/quotes.py、server/reading.py、server/positioning.py、server/kit_momentum.py、server/store.py、server/main.py、server/tests/、knowledge/kits/、knowledge/channels.json、web/js/app.js、web/css/styles.css、web/index.html
- 影响文档：docs/READING_POSITIONING.md（新增）、docs/ARCHITECTURE.md、docs/README.md
- 决策来源：陈浩文（依据设计提案 v2）
- 登记人：助手

## [2026-10-03] [BUILD] 当前学期公开课快照：每个节点本地检索，老师可点
- 变更内容：把 2026-2027-1 全院系公开课翻进 `knowledge/catalog/`（`courses.json` / `teachers.json` / `meta.json`）。检索先读这份快照，不再每次打教务。方向树上每个节点都用节点名做关键词查课，对不上就空着。老师名可点，看到本学期教了哪些课；简介只在 OpenAlex 对上北京大学任职时才写。生成脚本：`server/catalog_build.py`。
- 影响模块：server/catalog.py、server/catalog_build.py、server/pku_adapter.py、server/main.py、web/js/app.js、web/css/styles.css、knowledge/catalog/、docs/ARCHITECTURE.md
- 决策来源：邬程灿
- 登记人：助手

## [2026-10-02] [BUILD] 方向树画成「6 步主干 + 原有节点」（任务 4 路径进树）
- 变更内容：新增 `GET /api/paths`；前端启动时读路径，把数学、人工智能、认知、经济四棵树组成「6 步主干 + 原有节点」：主干竖排成一条粗线、带序号，原有概念节点按 `docs/paths/改树建议.md` §3/§4/§7/§8 的改动清单挂到对应步骤右侧（`web/js/app.js` 的 `CHAIN_ATTACH`），`FIELD_TREES` 原文不动；统计、系统不变。点主干看「先弄懂什么 / 做完怎样算过了」，并能直接「找能交出这一步的项目」；任务页标出当前节点属于第几步、这一步要交什么；「项目」页按树上的位置预选步骤。修复：第一次在方向区接过服务端已选方向时没有按已交任务对齐进度。
- 影响模块：server/main.py、web/js/app.js、web/css/styles.css、server/tests/、docs/DESIGN_SPEC.md、docs/TASK3_PROJECTS.md、docs/paths/README.md（一行）
- 决策来源：陈浩文（依据任务 4 改树建议）
- 登记人：助手

## [2026-10-02] [BUILD] 做完之后怎么接：今日、任务完成、项目评阅都落到下一件事
- 变更内容：今日的建议按「有项目没改完 → 选了项目没交 → 交过 3 次小任务该找项目 → 继续当前节点」排，每条一个主动作加一个备选；改项目时直接引用上次评阅的「下一步」。任务完成页在交够 3 次（或走完方向）后多一个「学完一块了，找个项目练手」。项目页每次评阅和上一版比多了几条；五条全做到标为「做完了」，给「找下一个项目（难一档）」。规则表见 TASK3_PROJECTS §8。
- 影响模块：web/js/app.js、web/css/styles.css、server/projects.py（五条全做到时状态记为 done）、server/tests/、docs/TASK3_PROJECTS.md
- 决策来源：陈浩文
- 登记人：助手

## [2026-10-02] [BUILD] 整条链路的接口测试 + GitHub Actions
- 变更内容：新增 `server/tests/test_api_flow.py`：用真实 FastAPI 应用走一遍 登录 → 五问 → 核对（改一条、划一条）→ 选方向 → 节点任务 → 提交反馈 → 找项目（实时来源全部「连不上」，走快照）→ 交压缩包 → 记录 → 软删，外加未知用户 / 方向的拒绝。数据库放临时目录、不联网、不调模型。仓库根目录新增 `.github/workflows/tests.yml`：每个 PR 和 main 上的提交跑后端测试、`node --check` 前端、并检查 `knowledge/paths.json` 和 `docs/paths/` 是否一致。
- 影响模块：server/tests/、.github/workflows/、README.md
- 决策来源：陈浩文
- 登记人：助手

## [2026-10-02] [FIX] paths.json 接上认知、经济路径；清掉 CHANGELOG 里残留的合并冲突标记
- 变更内容：#5 加了 `docs/paths/认知.md`、`经济.md`，但没有重新生成 `knowledge/paths.json`，main 上 `server/tests` 有一条测试失败。现在跑过 `knowledge/build_paths.py`，四个方向都有 6 步路径，「项目」页的认知、经济也按路径步骤选。`改树建议.md` §5 的项目形态是为数学、人工智能写的，生成时只给这两个方向带上。另外删掉本文件里 #3 合并时留下的一行 `=======`。检索加 12 秒总时限：慢来源（今天产业命题要 20–35 秒）先用快照、后台跑完写缓存，冷启动从 40 多秒降到约 17 秒，缓存热了约 5 秒。
- 影响模块：knowledge/paths.json、knowledge/build_paths.py、server/projects.py、server/project_adapters.py、server/tests/test_projects.py、docs/TASK3_PROJECTS.md、docs/CHANGELOG.md
- 决策来源：陈浩文
- 登记人：助手

## [2026-10-01] [BUILD] 「项目」接上任务 4 的方向路径
- 变更内容：新增 `knowledge/paths.json`（由 `knowledge/build_paths.py` 从 `docs/paths/*.md` 生成，目前有数学、人工智能）。「项目」页对有路径的方向改为「你在路径的哪一步」，按这一步的过关标准找项目；检索接口多一个可选字段 `path_step`，`context` 多返回 `paths` 和默认步骤。没有路径的方向不变。甲补上认知、经济后跑一次生成脚本即可接上。登录页「五个工作区」改为六个。
- 影响模块：server/projects.py、server/main.py、skills/project-scout/SKILL.md、web/js/app.js、web/css/styles.css、knowledge/、docs/TASK3_PROJECTS.md、docs/ARCHITECTURE.md、docs/paths/README.md（一行）
- 决策来源：陈浩文
- 登记人：助手
## [2026-10-02] [CHORE] 交付清理：删密钥与用户数据、夹具改合成、补任务 2 交付文档

这一轮不是加功能，是**让这个文件夹能安全地发给别人**（原话：
「把该删的过程文件删掉，把 apikey 等敏感数据删掉，把我的用户数据删掉，
按照开发规范留一份文档介绍我的部分的修改情况，确保我能把整个文件夹压缩发给别人」）。

### 删掉的

| 项 | 是什么 |
| --- | --- |
| `ResearchGuide-main/.env` | **真实 DeepSeek 密钥**。从未进过 git（只跟踪 `.env.example`） |
| `ResearchGuide-main/server/data/` | `demo.db`：一个真实用户 id + 画像 + 成绩单 + 全部记忆 + 明文密钥 |
| `eval/last-report.json` | 构建产物 |
| `审计与方案/`（仓库外） | 60+ 过程文件：审计稿、方案草案、探针、一次性载荷 |
| `docs/paths` | 1 字节的垃圾文件 |

全量历史上扫过 `sk-[0-9a-f]{20,}`（`git rev-list --all` 的每个 blob）：**零命中**，
密钥只在上面那两个工作区文件里。

### 换成合成数据的

真实成绩单曾经出现在 5 个地方。全部替换，并**保持学分和成绩不变**，
所以数字断言继续成立（通过学分 10.0 / 绩点学分 8.0 / 绩点 3.8020）：

- `server/tests/test_transcript.py` 的 `SAMPLE` 和 `REAL`
- `server/tests/test_transcript_in_dialogue.py` 的 `REAL`
- `tools/verify/verify_served.py`（原来直接读一个 `user-transcript.txt`）
- `tools/verify/verify_transcript_sse.py`、`verify_receipt_render.js`
- `eval/dialogue_cases.json` 里用户的自述、`test_memory.py` 的画像夹具

理由不只是隐私：**测试夹具不该来自某一个人的数据**。合成夹具更通用，
也不会让下一个读代码的人以为这是某个真实用户。

> 顺带核实：「北京大学」在 `knowledge/`、`skills/pku-course/`、`discipline-map/`
> 里是**公开参考数据**（含一份国标 `gbt13745_source.txt`），不是个人数据，保留。

### 搬进来的

`审计与方案/` 里 8 个有长期价值的验收脚本搬进 `ResearchGuide-main/tools/verify/`，
并把写死的仓库外路径改成仓库内相对路径。

**为什么必须搬**：`test_render_layer.py` 以前找不到脚本就 `skip`，
而脚本在仓库外 → 别人 clone 下来这 4 条**永远是跳过的**。那等于没有这层保护。

### 新增文档

[`TASK2_DIALOGUE.md`](TASK2_DIALOGUE.md)：任务 2 交付说明（闭环、记忆六层与三道闸门、
九大类、成绩单与绩点、对话↔任务区、接口、跑法、边界）。
**取代** `审计与方案/05-任务2交付说明.md`（那份只覆盖内核、早于记忆层/成绩单/前端）。

其中第 12 节「我改过别人代码的地方」请重点看——含一处**尚未在群里定**的接口冲突：
任务 3 用 `stage=0..3`、任务 4 用 `stage=1..6`，同名字段两套语义，
建议拆成 `practice_stage` 和 `path_stage_id`。

### 影响文档 / 模块

`docs/README.md`（导航表 + 测试数 61→271 + 测试入口）、`server/memory.py`、
`docs/CHANGELOG.md` 一处示例、`server/tests/` 三个夹具文件、
`tools/verify/`（新增目录）、`.gitignore`（已覆盖 `.env` / `server/data/`，未改）。

### 验证

`python tools/verify/run_existing_tests.py` → **271 passed**；
4 个渲染层脚本全绿；`verify_guards_can_fail.py` 8 条回滚全部证明守卫会红。

### 决策来源

用户直接指令（本轮）。**登记人：任务 2。**

---

## [2026-10-02] [FEAT] 能力从成绩单确定性推导（transcript:*），取代模型凭一段话编判断

接着上一条做。用户批准的方向：「让能力结论自动从成绩单推出来」。

### 为什么这是 `base:code` 事故的正面修法

那起事故的根不是提示词写得不好，而是**能力这件事根本没有底稿**：
模型读到「Vibecoding」只能自己编一个判断，于是写下
`'修过计算概论B(Python)93…课程基础扎实（依赖AI生成）'`——
一半是真实课程，一半是它自己加的评语，混在一条 `value` 里存成一个 `declared` 事实。
事后谁也分不清哪部分有依据。

现在成绩单在 `enrollments` 表里，能力**可以**是推出来的。所以：

| | 来源 | 谁写 | 长什么样 |
| --- | --- | --- | --- |
| `capability:*` | declared / inferred | 模型或用户 | 「我会一点 Python，只会照教程抄」 |
| `transcript:*` | **derived** | **只有代码** | 「修过 3 门数学类课程，学分加权平均 89.5：概率统计 (B) 96、线性代数 (B) 88、高等数学 (B) (二) 86.5」 |

两个 namespace 分开是有意的——混在一个 key 上就又会分不清硬证据和自述。

### 两条设计红线

1. **不写判断，只写事实。** `value` 里只准出现「修过哪几门、考了多少、加权平均多少」。
   绝不出现「基础扎实」「能力偏弱」——那是我们的推断，写进「事实」就再也分不清了。
   难度判断交给读到这条事实的模型自己下。有测试逐词守着（`test_derivation_reports_facts_not_judgements`）。
2. **只统计通过的课。** 挂了的高等数学不能算「修过数学类课程」，那句话会误导人。

关键词只是**匹配模式**，只在用户真实录入的课程名上做子串匹配，匹配不上就不产出任何东西——
没有一条课程是我们编的。推导是幂等的、不依赖历史，同样的成绩单永远得到同样的结论。

挂到 capability 层（`LAYER_BUDGET` 4 → 6），并在层内排序给 derived 加 0.9 的权重：
坑位不够时**硬证据应该压过自述**。0.9 刻意小于 1.0，所以用户直接问到某条自述时它仍能排前面。

### 「用户是最终权威」需要三处让路（这一版最初全漏了）

`sync_transcript_facts` 会在成绩单变动后重新推导。第一版实现里有两个会**覆盖用户意志**的 bug，
都是写测试时逼出来的：

1. **用户删掉的会自己长回来。** `user_reject` 我按 fact id 记，但重新推导可能新建一行、
   id 就变了，于是拒绝失效。改成**按 key** 记（从 revision 反查 key）。
2. **用户改过的会被改回去。** 我为了「让路」把 user_edit 的 key 从 desired 里 pop 掉，
   结果**撤除循环**把它当成「推导不出来了」直接 retract——用户刚改的那条被删了。
   现在是独立的 `protected` 集合：受保护的 key 不加、不改、也不撤。

代价不对称：让路只少一条注入的结论（成绩单还在，`transcript.summary` 工具照样查得到）；
不让路的代价是他发现有一条东西删不掉、改不了。所以让路。

### 界面

- 记忆面板：`source=derived` 的卡单独样式，**摊开依据**（「依据：概率统计 (B) 96、线性代数 (B) 88」）。
  不给「改」只给「不算」——逐字修改一条机械推导出来的事实没有意义，
  用户对它唯一合理的表态是否掉它。那个「不算」会被记住。
- 核对页粘贴成绩单时先给**预览**（会记下哪几条结论），落库前就能发现我们读错了课。

### 验证

- 离线 163 通过（本轮 +2，推导相关共 15 条）
- 19/19 评测通过（registry doc 和 env packet 都变了，所以必须重跑）
- `verify_derived_render.js`：真实 chat.js 源码 + 真实 `/api/memory` 载荷，25 项断言全通
  （依据必须来自**该条自己的 evidence**，不是写死几个课程名对样例；含转义）
- `probe_derived_live.py`：live 跑真实对话。模型引用具体课程和分数，
  并给出**有分寸**的判断：「你目前修过的数学课集中在工科数学这一档，
  还没有实分析、抽象代数这类更硬的课……够用，偏统计这一侧比较强，但还没被真正难的数学检验过」，
  任务锚在概率统计 96 / 计算概论 92 上，且明确要求用真实数据。
  没有出现无依据的评语；没有试图去写 `transcript:*`。

- 影响文档：`docs/DIALOGUE_CONTRACT.md` §5.2（新增推导一节）
- 影响模块：`server/transcript.py`（推导规则）`server/memory.py`（`sync_transcript_facts`）
  `server/schemas.py`（新增 derived / user_edit 来源）`server/main.py` `server/dialogue.py`
  `web/js/chat.js` `web/js/app.js` `web/css/styles.css`
- 决策来源：用户批准「让能力结论自动从成绩单推出来」

---

## [2026-10-02] [FEAT] 成绩单单开一张表 + 树洞格式自动识别 + 绩点计算；核对页摊开九大类字段

用户指令：「成绩单可以单开一个表，同时，参考这个 GitHub 项目，加入树洞成绩粘贴格式自动识别+
绩点计算的功能」「同时建议把我给出来的这些空都给用户展示出来，就在核对也分列展示，
表示填好这些信息可以让科研导向更准确」。

### 1. 成绩单进独立表（`enrollments`）

一门课一条：`course / grade / credits / term / kind / status`。

**为什么不塞进 `facts` 的 key-value**：一个人 20~40 门课 × 四个字段，
塞进 `value` 会变成一坨文本——**正是 `base:code` 那起事故的形态**，
既撑不住引文校验（闸门②判不了哪部分有依据），也没法按学期/成绩/关键词查。
`facts` 里只放**从成绩单推出来的能力结论**，底稿留在表里。

画像隔离同步覆盖：`_dump_live` / `_clear_live` / `_RESTORE_COLS` 三处都加上了，
并加了 `test_enrollments_survive_a_portrait_roundtrip`
（`affects` 那一列就曾在硬编码列名里被静默丢掉，同一个坑不踩第二次）。

**写入语义是「快照」不是「流水」**：`replace` 整表替换，`append` 跳过完全重复的。
逐条追加会让重复粘贴的课把绩点算重。

### 2. 树洞 / 教务粘贴格式自动识别（`server/transcript.py`）

规则和公式**移植自**开源计算器
[PKUMuZi/pku-gpa-calculator](https://github.com/PKUMuZi/pku-gpa-calculator)（MIT）。
格式：`学分 / 「学分」 / 课程名 / (课程性质)* / 成绩`，学期标题形如 `25-26学年度1学期`
且**向下贯穿**到后面的课。

**验证方式是重点**：没有手写样例对着自己的假设测，而是
`审计与方案/verify_transcript_vs_reference.js` 从上游 HTML 里**抠出它真实的解析函数**、
拿它**自己的示例成绩单**跑出基准，再用 `verify_transcript_my.py` 跑我们的实现**逐条对**。
结果：**50 门课、8 个学期、总绩点 3.838950、均分 91.617308、通过学分 110、
计 GPA 学分 104 —— 全部一致**。这个脚本里没有一个字符是我猜的。

另外加了两件上游没有的：解析失败**说得出原因**（「没识别到学期标题」），
以及未知行计数上报，而不是静默丢数据。

**绩点**：`GPA(x) = 4 − 3(100−x)²/1600`。

**一处有意与上游不同**：低于 60 分我们记 0，上游不设下限——
上游写法在 50 分时会算出 `-0.6875` 的**负绩点**，累加进平均会拖低别的课。
负绩点没有意义，北大教务口径也是不及格记 0。
做成 `GPA_FLOOR_AT_ZERO` 开关，改回上游行为只需一个常量。

**汇总口径**：通过学分含「合格」；计 GPA 学分**只含百分制**，
`W`/`I`/`合格`/`不合格` 不进分母。把「合格」当 60 分算会把绩点算低。

### 3. 核对页摊开九大类字段（用户反馈）

`GET /api/me/coverage` + 核对页的 `coverageBoard()`：九大类各一列，
每格标已填（给值）/ 空（给「填了有什么用」），顶部「已填 N / M 项」。

设计取舍：**每个空格必须带一句 why**。空格本身是邀请，
但只列空格不说收益就变成一张逼人填的表——所以 `why` 写在
`memory.COVERAGE_GROUPS` 里，和字段定义放在一起，不散在前端。
已填的格子**不重复**显示 why，免得整页都是废话。

点空格跳去对话而不是就地开输入框：这些字段大多需要上下文
（成绩单要粘贴、方向要聊），摆一排输入框只会让人填一半就走。

### 4. `transcript.summary` 只读工具（P3 落地）

默认**只回汇总**，要具体课程必须带 `keyword`。
成绩单是 §4 优先级里的 P3，整份进上下文会挤掉真正决定判断的那几条，
还会逼模型自己在几十条里找——找错一条就会说出用户一眼看穿的话。
「底稿留在表里，结论才进上下文」和「不塞进 facts」是同一个决定的两面。

### 5. 修掉的 bug

- **`/api/me/transcript` 提交永远 400**：我先判 `courses` 为空、再从 `text` 重新解析，
  于是只传原文（最常见的情形）被当成「没给课程」。**单元测试没覆盖这条路径，
  是端到端跑真实成绩单抓到的。** 已把顺序改成先解析再判空。
- 我自己在测试里写错两处，也都是被测出来的：`线性代数 (B)` 在两个学期各出现一次
  （我用字典取值拿了后一条）、`缓考` 解析时归一成 `I`（和上游 `normalizeScore` 一致）。

**验收**：148 个离线测试通过（新增 35 条）；19/19 评测用例通过；
`审计与方案/verify_transcript_api.py` 走真实接口 9 项全通（含画像隔离往返）；
`审计与方案/verify_coverage_render.js` 用**真实 app.js 源码 + 真实载荷**
渲染字段清单，13 项断言全通（含 HTML 转义）——没有无头浏览器，所以写了 DOM shim。

- 影响文档：`docs/DIALOGUE_CONTRACT.md` §5（新增工具 + §5.1/§5.2 成绩单与格式）
- 影响模块：`server/transcript.py`（新）`server/store.py` `server/memory.py`
  `server/tools.py` `server/main.py` `web/js/app.js` `web/css/styles.css` `web/index.html`
- 决策来源：用户指令（单开表 + 参考开源计算器 + 核对页摊开字段）

---

## [2026-10-01] [FEAT] 记忆改成按「时间跨度」分层 + 写入三道闸门 + 用户可改可删

**起因**：用户手测第二轮的反馈。原话两条：一是「AI 记忆不是很结构化？以后数据量多了全量注入吗？
是不是可以分成几个部分去处理？」，二是「这里现在的区分标准太不专业了，注入上下文照样会出错，
先判断一下这种记忆业界常用的通则是什么，我们这里需要个性化修改哪些」。
另有一条追问：「还有从实践跨度角度的呢，比如手头正在做什么项目？以及怎么让AI知道
哪些可以写进记忆，哪些不需要进入记忆」。

**先对齐业界通则**（读了原始论文，不是凭印象）：
- **CoALA**（arXiv:2309.02427）：工作记忆 + 长期记忆分 **episodic / semantic / procedural**。
- **Generative Agents**（arXiv:2304.03442）：记忆流 + **reflection**（合成为更高层结论）
  + 检索按 **recency + importance + relevance** 三信号加权。
- **MemGPT**（arXiv:2310.08560）：分层记忆、在有限上下文里做数据搬运。

**我们和通用聊天记忆不一样的地方**（这决定了不能照抄）：
1. 我们是**画像**不是聊天记忆——每条记忆都要回答「它改变哪个决策」，所以排序依据是
   **决策影响**而不是语义相似度。
2. 主体是**会变的人，而变化本身就是信号**——所以 semantic 记忆要**按变化速度再切一刀**，
   这一刀同时决定了「什么时候该重新问」。
3. 诚实标准更高——必须硬区分「他说的 / 我们推的 / 做出来的」，推断不得当自述复用。
4. 结论的过期速度不一样。

**做了什么**：
- **记忆分层**（`memory.LAYERS`）：`identity 身份` / `practice 当前实践` / `capability 能力起点` /
  `experience 经历积累` / `interest 倾向` / `constraint 临时约束`。层同时管三件事：
  提问顺序、注入预算、什么时候重新问。`LAYER_BUDGET` 给出每层名额。
- **补了缺失的 key**：`school`（原来根本没有——「某某大学信息管理系」里的「某某大学」
  被静默丢掉了），以及 `current:course` / `current:project`（当前实践，`default_ttl_days=90`
  自动过期，避免半年前的项目被当成「他正在做的事」）。
- **召回从「平表取 top-8」改成「按层给预算」**：全局抢坑位时一条课程成绩可能把「他的方向」
  挤出去，而且没有任何信号告诉模型记忆被截断了。层内相关度**只认多字词命中**——
  原来那个「单字命中 0.05/字」在中文里等于噪声，一句话的每个字都会命中一堆无关事实。
- **写入三道闸门**（默认不写，要写就举证），出发点是**代价不对称**：
  漏写一条，下次再问一遍就行；写错一条，它会**静默污染之后的每一个决策**，而且没人会发现。
  1. **在册**：key 命中 registry，且允许该 source。
  2. **引文撑得住值**：`evidence_quote` 要支撑写进去的 value。算「value 的内容有多少能在
     引文里找到」：`≥0.8` 收；`0.5~0.8` 收但**降级为 `inferred`**；`<0.5` 拒。
     value 不足 8 字跳过（`AI`、`大二` 是规范化缩写，逐字要求会误杀）。
     阈值是拿真实例子校准的（`审计与方案/calibrate_support.py`，9/9 符合预期）：
     真实事故那条 **0.29**，正常值 **0.67–1.00**，分得开。
  3. **说得清改变哪个决策**：`affects` 必填且命中白名单（`task_difficulty` `task_kind`
     `direction_choice` `question_next` `course_pick` `pace` `feedback`）。**填不出来就没资格进记忆。**
- **中文 slug 放行 + key 规范化**：模型写 `current:选课数据大作业` 是很自然的，
  只放行 `[a-z0-9_]` 会把真实信息整条丢掉（同一个错犯过两次，第二次是中文）。
  `canon_key` 把空格/下划线统一成连字符、削掉首尾分隔符。注意 ASCII-only **从来没真正
  解决同义重复**（`ai`/`AI`/`人工智能` 照样三条），同义不同词靠 single 基数的 supersede 兜。
- **用户可看可改可删**（`GET /api/memory` 按层返回 + 复用已有的 `PATCH/DELETE /api/me/facts`）。
  改一条会**升级为 `user_edit`、置信度 1.0、留 revision、memory_version+1**；删是软删
  （置 `retracted`）不硬删。原来这两个接口是裸 `update_fact`，既不升级来源也不留 revision，
  用户改完的记忆和模型推断的在库里长得一样。对话界面右侧按层分列展示，每条能直接改删。
  - 没有新开一套接口——**刻意复用**：前面 `actions` 和 `tasks` 两套任务系统不连通
    就是新开一套的代价，不再犯。

**修的真实 bug**（都是这轮验证时暴露的）：
- `server/main.py` **没有 `import memory`**，新加的 `/api/memory` 直接 500
  （`py_compile` 查不出 `NameError`）。
- `store._load_live` 的 facts INSERT 是硬编码列名，**新加的 `affects` 没跟上**——
  切画像时这一列会被静默丢掉。已补列 + 加回归测试。

**prompt 同步改了两处**，否则模型不写 `affects` 会导致记忆全被静默丢掉：
- `_registry_doc()` 改成按层列 key，并在系统提示里解释「当前实践」是什么。
- `_PROPOSAL_RULES` 加了「这些该写，别漏」正面清单。**这一步是被评测逼出来的**：
  只写「默认不写」的负面清单，模型连「这周只有十分钟」这种典型临时约束都不写了
  （`rejected_ops` 为空，说明是它主动不写，不是被闸门拦的）——和之前
  `action_has_landing` 那次一样，单边规则会让模型变得不敢出手。

**提问阶梯**（用户反馈第 1 点：「我只说了个大二，怎么跳过学校先问课程了……不是写个硬规则用的，
只是从这个例子让你了解现在追问不自然」）：
- 把层的顺序直接当作阶梯：身份 → 当前实践 → 能力起点 → 经历积累 → 倾向 → 临时约束。
  跳级就是不自然——还没弄清他是谁，就问到了他的能力细节。
- 代码侧 `memory.ladder_state(uid)` 算出「哪层已经有数、最早的空白层是哪一层」，
  注入环境包。**刻意没做成硬闸门**：问题是一句自由文本，靠关键词判它「在问哪一层」很脆；
  本轮只有两次模型调用，没有余量再分类一次。所以设计是**代码给真相、模型定措辞、评测管结果**。
- 阶梯只管「你想了解他时问什么」，不是每轮都必须问。上下文在别处（追问概念、刚说急事）
  就顺着走——prompt 里明确写了这一条，防止它变成一张问不完的表。
- 补了两条评测：`ladder_asks_earliest_gap`（只说大二时必须问到身份层）、
  `ladder_no_skipping_to_capability`（不许跳去问课程/编程/数学）。

**又抓到两个自己埋的 bug**（都是「把真东西跑一遍」才暴露的，grep 关键字查不出来）：
- **`build_env` 里的 `limit=10` 把分层预算架空了。** 召回是按层序拉平的，
  这个总数会把靠后的层截掉——等于把平表抢坑位换了个地方犯。
  实测：9 条能力 + 9 条当前实践时，**倾向和临时约束双双消失**。
  现在总上限由各层名额之和决定，只留一个很大的 `RECALL_HARD_CAP` 防异常数据撑爆上下文。
  加了回归测试 `test_env_packet_keeps_tail_layers_even_when_early_layers_are_full`。
- **`layer_hint` 挂错了对象**：它描述的是「这一层」，却被塞进了每条 fact 里，
  前端读 `L.layer_hint` 取不到，那行说明永远不显示。
  这个是靠**把 chat.js 里真实的渲染函数抠出来、用最小 DOM 喂真实载荷跑一遍**才发现的
  （没有无头浏览器，所以写了个 DOM shim：`审计与方案/verify_ui_render.js`）。

**验收**：109 个离线测试通过；19 条评测用例 19/19 通过（新增
`vibecoding_is_not_invented_into_incompetence` 直接复现上面那条真实事故、
`current_practice_is_captured` 验当前实践落层）；
`审计与方案/verify_memory_layers.py` 走真实接口验分层/闸门/用户改删全通；
`审计与方案/verify_ui_render.js` 用真实 chat.js 源码 + 真实载荷验界面渲染全通。

- 影响文档：`docs/DIALOGUE_CONTRACT.md` §3（重写为分层 + 三道闸门）、§4（召回改分层预算）
- 影响模块：`server/memory.py` `server/store.py` `server/schemas.py` `server/main.py`
  `server/dialogue.py` `web/js/chat.js` `web/css/styles.css` `eval/run_eval.py`
  `eval/dialogue_cases.json`
- 决策来源：用户实测反馈第二轮（记忆结构化 / 业界通则 / 实践跨度 / 写入标准 / 分列展示）
- 登记人：任务2

---

## [2026-10-01] [FIX] 任务必须有依据 + 三个实测 bug（用户手测反馈）

- **产品问题（最重要）：还没了解就派任务。** 用户实测：只说了「信管大二、想走大数据」，
  系统就派「关掉讲义重写一段代码」——这句对任何信管大二学生都成立，等于没了解这个人。
  这正是产品原则二「个性化必须有依据」被违反。现在做成了**代码侧闸门**：
  提案里的 `next_action` 必须带 `based_on`（本画像生效事实的 id），一个都引不到就整个丢掉，
  本轮不给落点。`based_on` 同时返回给前端，行动卡上显示「依据你说的：…」，
  把「凭什么给我这个」摊开给用户看。prompt 里也加了判断法：把用户信息划掉换成任何一个
  北大大二学生，这句话还成立吗？成立就是套话，不许填。
  - **同时修了反向问题**：收紧之后模型一度连用户明确问「我这周该干什么」都不给任务，
    变成连续三轮换个说法问同一件事——这是同一种毛病（一直在指望用户回答），只是反过来了。
    现在规则是：只要手上有至少一条跟他有关的真实事实，就直接给任务并引用它；
    同一个问题最多连续问两轮，第三轮必须换成给任务或给可点选项。
- **修 bug 1：`/api/dialogue/history` 返回数据库原始行，导致刷新后按钮全废。**
  三个出口形状不一致——`turn` 返回规整形状（`action_id`），`history` 和 `action_event`
  返回原始行（`id`）。前端刷新后读 `a.action_id` 得到 `undefined`，
  点「就做这个」发的请求缺字段 → 422；而 `api()` 把 FastAPI 的 422 `detail`
  （数组）直接塞进 `Error`，toast 就显示成 `[object Object]`。两个现象同一个根因。
  现在统一走 `_public_action()` 一个出口，并加了「三个出口形状必须一致」的回归测试。
- **修 bug 2：`[object Object]` 本身。** `app.js` 的 `api()` 用 `new Error(data.detail)`，
  后端 `detail` 是数组/对象时 `String()` 就变成 `[object Object]`，把「缺 action_id」
  这种明确信息盖掉了，白白多花排查时间。现在统一格式化成能读的一句话。
- **修 bug 3：空消息把请求打成 500。** `/api/onboard/message` 转调内核前没校验空串，
  内核按契约抛 `ValueError`，直接冒成 ASGI 异常。现在返回 400。
- 影响模块：server/dialogue.py、server/store.py（actions 表补 `based_on` 列 + 迁移 +
  快照恢复列）、server/main.py、web/js/app.js、web/js/chat.js、web/css/styles.css、eval/
- 验证：离线测试 79 → 85 全过；真实模型评测 12 → **15 条用例 15/15 通过**
  （新增 `no_generic_task_early` / `task_carries_its_basis` / `no_nagging_after_action`）。
- 决策来源：用户手测反馈（任务 2）
- 登记人：助手

---

## [2026-10-01] [BUILD] 任务 2：对话内核改为「模型决策、代码裁决」的闭环
- 变更内容：
  - **架构反转**。原来 `planner.py` 用 S0/S1/S2 规则先决定动作、模型只改措辞；现在改成一轮最多两次模型调用：调用① 出结构化 `TurnProposal`（观察 / 记忆写入意图 / 工具意图 / 回复 / 下一步），代码校验并提交，需要外部信息时执行只读工具，再由调用② 带工具结果收口。代码从「决定做什么」退到「决定能不能做」。
  - **记忆治理**（新增 `server/memory.py`）：key registry 白名单（不在表内一律拒绝）、引文必须能在本画像消息里逐字找到、confidence 由代码按来源指定（declared 0.6 / inferred 0.4 / behavior 0.8）、模型不得自称 behavior、`experience:*` 只能由提交事件写入、`constraint:*` 必须带 `valid_until`、方向互斥（写新方向自动把旧的置 `superseded`）、同 key 同 value 幂等（重试不重复计数）。被拒的操作进 `rejected_ops`，前端如实告诉用户「有 N 条我没记下来」。
  - **画像完全隔离**（修 M5）：快照切换从只覆盖 facts/messages/onboard_state 扩到 tasks/submissions/projects/conversations/actions/events/fact_revisions/decisions。新建画像不再看到旧画像的任务。
  - **工具层**（新增 `server/tools.py`）：`course.search` / `project.search` / `project.review`，全部只读；工具失败原样返回 `ok=false`，由模型如实转述，不许编造结果顶上。
  - **接口**：新增 `POST /api/dialogue/turn`、`POST /api/dialogue/stream`（SSE，真实阶段推进 + 回复正文增量）、`POST /api/dialogue/action`、`GET /api/dialogue/history`。`/api/onboard/*` 保留原签名，配了模型时**冷启动第一句起**就由新内核接管并把结果翻译回旧响应形状（`onboard_state` 由内核同步维护，附加信息挂在 `dialogue` 字段上），没配模型时仍走老向导，离线 demo 不受影响。
  - **前端**：新增对话视图（`web/js/chat.js`），支持多轮、长回复、轻量 Markdown 渲染、生成中状态行（观察 → 决策 → 核对记忆 → 查资料 → 组织回复）、回复逐字流式呈现、下一步行动卡（接受 / 完成 / 先不做）、「它记住的」侧栏、这一轮记下了什么 / 没记下什么 / 查没查到的如实回执。侧栏「画像」改为「对话」。
  - **安全修复**：`POST /api/tasks/{tid}/submit` 增加归属校验。原来任何 uid 都能提交别人的任务（审计 P0，探针实测 HTTP 200），现在返回 403。
  - **顺手修掉的状态泄漏**：`planner._signals` 原来用排除列表（`draft/dismissed/deleted`）过滤事实，新增状态会静默漏进方向计分；改成白名单 `DECISION_STATUSES`。`facts` 表新增 `valid_until`，`UserFact` 同步。
  - **不编造事实的代码侧兜底**：结构化路径（写进记忆的事实）本来就由引文逐字校验兜住，但**正文里的具体名称**没有约束。实测发现：检索失败后模型会承认「没查成功」，接着照样列出 7 个课名当推荐清单——大一学生拿这个去选课会踩空。现在工具返回 `ok=false` 且正文出现 `《…》` 时，触发一次定向重写（只删名称、保留原意与结构）；重写无效则保留原文并在响应里标 `fabrication_risk: true`，进日志可统计，不假装没发生。这是「正常路径最多两次模型调用」的唯一例外，语义见 DIALOGUE_CONTRACT §9.1。**效果实测**：这条规则单靠 prompt 只能压到 4 次里约 3 次合规；加兜底后连测 4 次全过（日志里能看到 repair 真的被触发过一次）。
  - **`next_action` 与 `pending_action` 拆开**：原来模型决定不给落点时，代码会回退成「把当前还开着的行动返回」，导致一个字段混了两种含义——「这一轮该不该派任务」从响应里根本看不出来（用户说「先别推进了」，响应里却仍有任务）。现在 `next_action` 只表示本轮决定，`pending_action` 单独表示界面状态；`move=acknowledge_stop` 时开着的行动会被置 abandoned。
  - **记忆 key 正则放宽**：原来只放行 `[a-z0-9_]`，模型写 `interest:machine-learning` 会被整条拒掉——丢的是用户真实说的话。现在允许连字符与点。
  - **工具参数兜底**：模型漏传 `course.search` 的必填 `query` 时，退回用用户这句话当检索词，并在结果里标 `query_from: user_message`，不再白费一整轮。
  - **测试**：`server/tests/` 从 11 → 79 个，新增 `test_memory.py`(18)、`test_dialogue.py`(20)、`test_api_dialogue.py`(13)、`test_tools.py`(11)、`test_portrait_isolation.py`(4)，覆盖校验规则、两次调用契约、行动生命周期与语义拆分、不编造兜底、画像隔离、SSE、P0 归属。
  - **评测**：新增 `eval/dialogue_cases.json`（12 条多轮用例）+ `eval/run_eval.py`，断言只判可机器判定的性质（是否重问已知信息、用户要动作时有没有落点、检索失败是否如实且不点名、改口后旧事实是否失效、是否重复记忆、说停时是否收干净）。真实模型验收 **12/12**。
  - **文档**：新增 `docs/DIALOGUE_CONTRACT.md`（v1 冻结契约：TurnProposal / TurnReply schema、memory key registry、env packet、工具 registry、九条确定性校验、降级语义、验收）。
- 影响文档：`docs/DIALOGUE_CONTRACT.md`（新增）、`docs/ARCHITECTURE.md` §5、`docs/CHANGELOG.md`（本条）
- 影响模块：server/memory.py、server/tools.py、server/dialogue.py（新增）；server/store.py、server/schemas.py、server/planner.py、server/llm.py、server/main.py、web/js/chat.js、web/js/app.js、web/index.html、web/css/styles.css、eval/
- 决策来源：任务表（任务 2 · 交互与问卷 / 对话 agent + 记忆）
- 登记人：助手

---

## [2026-09-30] [DOC] 新增方向路径交付目录（任务 4 · 数学 / 人工智能）
- 变更内容：新增 `docs/paths/`：`README.md`（每步的固定字段 + 主链标注约定）、`数学.md`、`人工智能.md`、`改树建议.md`。两条路径各 6 步，每步含「为什么是这一步 / 先弄懂什么 / 做完怎样算过了 / 依据 / 对应现有树节点」；文中共 41 条外部链接于 2026-09-30 逐条请求核对，核不到的四条（AMS Notices、Papers with Code、Hugging Face、Tao 某篇旧文）在文末如实记录，未用替代链接补位。
- 影响文档：`docs/paths/`（新增）；甲的两个方向（认知、经济）待补
- 影响模块：暂无代码改动；`web/js/app.js` 的 `FIELD_TREES` 改不改、怎么改，等两人路径合并后再定（建议见 `docs/paths/改树建议.md`）
- 决策来源：陈旭 依据任务表（任务 4乙）
- 登记人：助手

## [2026-09-30] [BUILD] 任务 3 边学边练：公开来源检索项目、交压缩包、五条标准评阅
- 变更内容：新增侧栏「项目」。来源清单 `knowledge/project_sources.json`（24 个来源、72 条逐字核对过原文的样例）；7 个来源实时检索（和鲸、飞桨学习赛、天池学习赛、北大开放数据、科学数据银行、创新大赛产业命题、欧拉计划中文站），其余给快照和「去哪找」路线；查不到就空着。成果以 `.zip` 提交，只在内存里读、不执行，按五条标准评阅，规则判定是上限，模型引文必须在文件里逐字找得到；每次提交写回一条行为事实。模型的工作说明写在 `skills/project-scout/`、`skills/project-review/`，代码与 skill 分工见 `skills/README.md`。新增接口只加不改，见 ARCHITECTURE §5。
- 影响模块：server/projects.py、server/project_adapters.py、server/submission.py、server/skills.py、server/store.py（新增 projects 表）、server/main.py、web/、knowledge/、skills/、docs/TASK3_PROJECTS.md
- 决策来源：陈浩文
- 登记人：助手

## [2026-09-30] [BUILD] 首页点线图重画 + 工作区统一样式 + 后端几处修复
- 变更内容：首页去掉 Three.js 点云（`web/vendor/three.module.js` 5.4 万行删除），改为 Canvas 2D 点线图：六张图各一种一眼能认的线稿（台阶与门、问答气泡、罗盘、秒表、打勾的提交、生长的树），点距一致、每图一个主色；每屏前 40% 停住读字，之后像一支笔按笔画顺序改画成下一张。工作区重写 `styles.css`（1739 行叠加覆盖 → 一套 token），品牌移入侧栏，页面统一左对齐；方向树改为整齐树布局，连线不再交叉；任务与反馈去掉卡片套卡片；今日按「没聊 → 没核对 → 没方向 → 当前节点」给唯一建议。修复：视图快速切换时两个页面叠在一起、中文输入法回车误发送、今日页不认服务端已选方向、SQLite 连接不关闭、课程检索每次都起子进程（加 10 分钟缓存）、学期缓存永不过期（改为 3 天）、规则反馈对任何 60 字以上提交都给满分、LLM 无重试无 JSON 模式。
- 影响模块：web/、server/store.py、server/pku_adapter.py、server/llm.py、server/workbench.py、.env.example、docs/DESIGN_SPEC.md
- 决策来源：陈浩文
- 登记人：助手

## [2026-09-28] [FIX] 方向建议按当前画像分开
- 变更内容：方向区的建议改由当前画像的兴趣事实计算，不再因为已经选过方向就消失。不同画像命中的方向不同，芯片上标「建议」，并写一句为什么贴近。每份画像各自记住当前方向和进度。
- 影响模块：server/planner.py、server/main.py、web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-28] [FIX] 刷新后保住节点进度，切换方向要确认
- 变更内容：方向和任务上的进度按已经生成过的节点任务恢复，刷新不再退回树根。点另一个领域只是预览，要点「确认切换方向」才会改当前方向，并从新树的起点重新开始。
- 影响模块：web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-28] [FIX] 切换方向不再跳进任务，提交后留下反馈
- 变更内容：在方向区点另一个领域时留在树上，并记下这棵树为当前方向。任务区只显示这棵树上当前节点的题目，不再沿用那道固定的对比实验。提交后在当前页写出 AI 反馈，不再整页重画。
- 影响模块：web/js/app.js、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-28] [BUILD] 今日和方向先画出来，任务跟当前节点走
- 变更内容：进入今日和方向时不再等模型写完才显示。今日的内容按顺序浮出，方向树从起点一层层出现。任务对应当前方向树上的节点，完成后才提示进入下一节点并安排下一阶段任务。
- 影响模块：web/js/app.js、web/css/styles.css、web/index.html、server/workbench.py、server/main.py
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-28] [BUILD] 接上 DeepSeek，方向树加深
- 变更内容：本地 `.env` 写入 DeepSeek 密钥后，对话、方向文案和任务反馈会走真实模型。方向区改为六个领域各自一棵四层左右的树，点节点弹出介绍，可沿分支继续点。工作区侧栏和面板收得更紧。
- 影响模块：server/llm.py、web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 粒子左暗改成渐变，鼠标只碰身边
- 变更内容：从屏幕右侧到左侧亮度慢慢降一点，左边的粒子还在，不会突然灭掉。鼠标恢复成只拨开身边一小圈，划一下不再把整张图扭开。
- 影响模块：web/js/app.js、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 首页粒子让开文字，鼠标改成慢回的波纹
- 变更内容：散开时粒子主要往右走，左边文字区域的粒子压暗、缩小，避免挡住字。鼠标划过时粒子立刻分开，再像水波一样往外荡，大约三秒才慢慢合上。
- 影响模块：web/js/app.js、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 多画像、黑底粒子，方向改成生长的树
- 变更内容：画像可以新建、切换、删除，只有一份时显示为画像一。应用页去掉说明性文案。首页改为黑底，粒子用白、蓝、绿发光；图形聚好后先停一截再散开，散开时粒子朝眼前冲过来再聚合成下一张。方向区用一条会分叉的树标出已经过的节点、当前节点和还可以去的节点。
- 影响模块：server/store.py、server/main.py、web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 进入后改为工作区，不再按 1 到 9 往下点
- 变更内容：登录和首页体验按钮之后进入「今日」。左侧是今日、画像、方向、任务、记录五个工作区，主区域只显示当前这一个。画像里的对话和核对、任务里的提交和反馈，都留在各自工作区内部。保存、切换、返回不再被一条全局步骤条串起来。
- 影响模块：web/index.html、web/js/app.js、web/css/styles.css
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 首页补上每步说明，图案更快散开
- 变更内容：六屏各补一段重点说明，小任务页写清二十分钟、留下结果、按提交说话。图案聚好后，大约滑两下就开始散开，不再在页首停很长一段。
- 影响模块：web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 首页加长，体验按钮移到末尾
- 变更内容：「立即开始体验」只出现在最后一屏底部。每一屏加高，并用序号、刻度、清单这类版式把高度撑开。粒子在后半段滚动里慢慢散开，范围铺到整屏，再聚成下一张图。
- 影响模块：web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 首页图案改回粒子勾线
- 变更内容：去掉实线轮廓和填色。六张图都由更密的粒子自己画出来，分别是人与门、侧脸对话、罗盘分岔、二十分钟的钟和清单、批改标记、树与上升节点。滚动时先散开再聚拢；粒子可增减并淡入淡出，颜色随图渐变。
- 影响模块：web/js/app.js、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 首页改为连续滚动，轮廓实线、粒子填色
- 变更内容：去掉整屏吸附。滚动时当前形状先散成带噪声的曲线云，再聚成下一步。每个图案用实线勾边，粒子填在轮廓里面。
- 影响模块：web/js/app.js、web/css/styles.css、web/index.html
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-27] [BUILD] 首页粒子改为 Three.js 点云
- 变更内容：首页六屏粒子从 2D 方点改为 WebGL `Points`（约 2 万颗）。轮廓仍对应六页主题；滚动时在预计算点云之间形变。运动带小幅噪声漂移，鼠标附近有斥力与涟漪。点是软边圆点，墨色里夹少量橙色。未加全屏泛光，避免纸色底上字发雾。Three.js 放在 `web/vendor/three.module.js`。
- 影响模块：web/js/app.js、web/index.html、web/vendor
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-24] [DOC] 项目基线 v1.0 建立
- 变更内容：完成旧 Demo 审计、产品重构方案、全套 docs（PRD/架构/路线/分工等 21 份）
- 当前状态：**产品功能描述为草案**，D1–D10 决策（见 PRODUCT_EXPLAINED §五）待 2026-09-25 脑暴会逐条拍板
- 影响模块：全部
- 决策来源：项目组
- 登记人：A

## [待脑暴] 以下条目 9/25 会后补录
- D1 产品名
- D2 Onboarding 形态
- D3 首批重点学科名单
- D4 微任务素材来源
- D5 账号形态
- D6 部署位置
- D7 反馈通知频率
- D8 LLM 选型
- D9 论文陪读版权边界
- D10 种子用户计划

## [2026-09-27] [BUILD] 页面连接模型 + 视觉提一档
- 变更内容：首页与右上角可填写 OpenAI 兼容接口，连通后写入本机 `.env`。开场白、方向卡「为什么是你」、下一步文案、任务反馈在连通后走模型，失败仍回退规则。首页增加点云、序号橙色游标、分页底色和胶囊导航。
- 影响模块：server/llm.py、main.py、onboarding.py、planner.py、web
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-26] [BUILD] 接入 OpenAI 兼容模型 + 首页视觉升级
- 变更内容：新增 `server/llm.py`，对话回应、自由文本事实归纳、NBA 文案、任务反馈在配置 `LLM_API_KEY` 后走真实模型，失败回退规则。首页增加加载页、顶部引导细线和序号色块。密钥放 `.env`，示例见 `.env.example`。
- 影响模块：server/llm.py、onboarding、planner、workbench、web
- 决策来源：邬程灿
- 登记人：助手

## [2026-09-25] [BUILD] W0 核心 Demo 交付 + 文档体系精简
- 变更内容：
  1. **W0 Thin Slice 全链路实装并验证**：昵称登录 → 5 轮 onboarding（选项卡+不知道）→ UM 确认页（可改可删）→ 3 张方向推荐卡（rationale 引用用户原话 + 北大真实课程 live 检索 + 入门读物）→ 20 分钟微任务 → 提交 → rubric 逐条反馈 → behavior 事实真实写回 UM → 进阶 NBA。技术：FastAPI（server/）+ 无构建静态前端（web/），课程检索经 uv 子进程调 skills/pku-course（原 pku-course-skill-main 原样迁入），LLM 三处按 NEXT_PRE §3 白名单 mock（数据结构真实）。
  2. **文档精简 25→5**：新增 DESIGN_SPEC（旧 Demo 视觉提炼为规范）、ARCHITECTURE（四份长文档浓缩合并）、TASK_ASSIGNMENTS（6 人 vibecoding+PR 分工）；删除 PRD/VISION/GAP/AUDIT/DOC_SYNC/SESSION_PROMPT/RISK/ROADMAP 等 20 份长文档与 ideas/想法类文件。
  3. **旧 Demo 处置**：discipline-map 网页删除（设计已提炼进 DESIGN_SPEC，搜课适配逻辑迁入 server/pku_adapter.py）；可复用资产迁入 skills/pku-course 与 knowledge/。
- 影响模块：全部
- 决策来源：别克扎提（产品 Owner）
- 登记人：别克扎提·拜别提
