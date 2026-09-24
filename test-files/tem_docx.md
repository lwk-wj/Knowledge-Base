**梁多强 - AI Agent 开发**

_8 年开发经验 · 系统转型大模型应用开发 · 具备全栈端到端独立交付能力_

男 · 34 岁　｜　上海 · 松江区　｜　电话：17601231111　｜　邮箱：xxxxaaabbb@foxmail.com

求职意向：AI Agent 开发 / 大模型应用开发 / 全栈开发

**个人概述**

- 独立设计、编码、部署了 3 个完整 Agent 项目，覆盖多 Agent 编排、RAG 知识问答、对话式 BI（Text2SQL） 三大主流方向，全部 Docker 化部署上线。
- 深入 RAG 全链路工程：混合检索（向量 + 关键字 + 图谱）→ RRF 融合 → Rerank 重排 → 邻居窗口扩展，并自建四层评测体系驱动迭代——通过邻居窗口优化，使答案要点覆盖率实测从 55.6% 提升至 67.4%。
- 掌握 Agent 工程化底层：不依赖框架黑盒，从零手写 agent loop、多 Agent 任务编排、提示词与skill的结合、上下文压缩、Function Calling 与 MCP 集成，对 Agent 运行机制有清晰的理解。
- 扎实的全栈落地能力：后端 Python / Node.js，前端 React / Vue，数据侧 MySQL / PostgreSQL / Neo4j / Milvus / Elasticsearch，Docker Compose 一键部署。

**专业技能**

**大模型应用框架（熟练）**

LangChain、LangGraph、DeepAgents、Qwen-Agent、Nanobot、Vanna、Vercel AI SDK、Mem0、Dify、Coze

**LLM 核心能力（熟练）**

Prompt Engineering、Context Engineering、Function Calling、MCP、Agent Skill、RAG（混合检索 / Rerank / 评测 / 优化）

**评测 / 可观测性（熟练）**

LangSmith、Langfuse、OpenTelemetry、Grafana / Loki / Prometheus / Tempo、Sentry

**后端（熟练）**

Python（FastAPI / Flask / APScheduler / SQLGlot）、Node.js（NestJS）；RESTful / SSE / WebSocket / JSON-RPC

**前端（熟练）**

React / Vue、TypeScript、Vite、Ant Design X、AI Elements、Agent Chat UI

**数据库 / 检索（熟练）**

MySQL、PostgreSQL（pgvector / pg\_trgm）、Elasticsearch、Milvus、Neo4j（Text2Cypher / 知识图谱）、ChromaDB

**工程**

Docker / Docker Compose、Nginx； 了解消息队列、事件循环、高并发；

**AI 工具与模型**

日常用 Claude Code / Cursor / Copilot 提效；熟悉 DeepSeek / Qwen / Kimi / GPT / Claude / Gemini 等主流模型，了解在推理 / 长上下文 / 成本上的差异

**项目经历**

**项目一 · Deep Research 多 Agent 调研助手**

**项目地址**：http://139.224.212.216:8000

_输入调研主题 → Lead 自动拆解派发 → 多名 Researcher 并行联网检索 → 汇总成一份带引用的中文报告，全过程终端 / 网页实时可见。_

**技术栈**：Python、OpenAI SDK、Anthropic MCP SDK、FastAPI + Gradio、博查 Bocha 联网搜索、Tiktoken、qwen3.7-plus + deepseek-v4-flash、OpenTelemetry、Langfuse、Grafana + Loki + Prometheus + Tempo、Sentry

**核心工作**：

- **手写 Agent Loop**：基于 OpenAI chat.completions 实现工具调用循环，解析 tool\_calls、并行执行工具、按 tool\_call\_id 回灌结果，对 Agent 推理-行动-观察机制有清晰的把控。
- **多 Agent 编排**：设计 Lead（仅负责分解 / 综合）+ N 个 Researcher（自治认领任务）的 Supervisor 架构；自建任务板（每任务一 JSON、blockedBy 依赖图、加锁原子认领）+ 邮箱（每人一 JSONL 收件箱）+ 团队名册三套协作基建。
- **上下文工程**：实现 micro compact（折叠较旧工具结果、仅保留最近 N 条原文）+ auto compact（超 100k token 阈值时归档对话并由 LLM 总结替换），用 Tiktoken（o200k\_base）计 token 驱动压缩。
- **MCP 集成**：将 asyncio-only 的官方 MCP 客户端，用后台事件循环线程桥接进多线程运行时，支持多 Researcher 并发安全调用同一搜索 session。
- **可靠性与质量保障**：看门狗定期回收"负责人已下线但未完成"的卡死任务；坚持"无发现即标 failed、绝不谎报 completed"；检索轮数用尽时强制收尾防死锁；完整 transcript 归档便于复盘。
- **可验证引用体系**：发现（finding）强制携带真实来源 URL，最终报告用 \\[n\\] 行内引用，全部可回溯到 Researcher 实际抓取的网页。
- **分层可观测性**：OpenTelemetry 埋点，让一次调研在 Langfuse（LLM 视角：prompt/token/成本）与 Grafana（服务视角：RED 指标 / trace / 日志）下共用同一 trace\_id，并接 Sentry 告警；实跑验证一条 trace 含 136 个 span、LLM 与出网调用同树呈现。

**成果亮点**：

- 约 2100 行 Python 实现一套完整可跑的多 Agent 系统（任务系统 / 邮箱 / 团队 / 自动派发 / 技能加载 / MCP / 上下文压缩）。
- 默认 3 名 Researcher 并行（页面可调节），单次调研控制在 ≤15 分钟墙钟内收敛；Gradio 实时可视化任务板、团队成员、消息流、发现与报告。

**项目二 · Book Chat 书籍 RAG 系统**

**项目地址**：http://139.224.212.216

_上传 EPUB 电子书 → 自动解析 / 切片 / 向量化入库 /（开关可选）抽取知识图谱 → 通过「向量 + 关键字 + 知识图谱」多路召回作答，并标注《书名·章节》出处（内置《三体》语料支持多跳关系问答）。_

**技术栈**：TypeScript、NestJS、LangGraph、AI Elements + Vercel AI SDK、React + Vite、PostgreSQL（pgvector + pg\_trgm）、Neo4j、Prisma、deepseek-v4-flash + deepseek-v4-pro、LangSmith

**核心工作（LangGraph 编排多步检索链路）**：

- **混合检索**：语义路（pgvector HNSW）+ 关键字路（pg\_trgm word\_similarity）双路并行召回 top20 → RRF 排名融合（k=60） → 通义 Rerank 重排 取 top4；Rerank 未配置 / 失败时优雅降级回 RRF 顺序。
- **"小块匹配、大块作答"邻居窗口扩展**：检索仍在 500 字小片上做，命中后按"同书同章"前后各扩 ±2 片拼成完整段落注入 LLM，补回被切片截断的因果 / 叙事上下文。
- **Query 改写 + 三叉路由**：喂入完整对话历史消解指代、扩写多条 query 提升召回覆盖；按问题类型路由到 闲聊 / 内容检索 / 知识图谱 三条链路（无图谱时自动降级回内容路）。
- **知识图谱问答**：Neo4j + Text2Cypher，对关系 / 多跳问题（如"叶文洁创立了什么组织"）生成 Cypher；做只读校验（拒写语句）+ 参数化执行防注入。
- **入库管线**：EPUB 异步解析 → 切片（500 字 / overlap 80）→ embedding → 入库 → LLM 抽取实体关系三元组建图；SHA-256 文件去重防重复入库。

**评测与优化**：

- **自建四层分阶段评测体系**：L1 路由准确率、L2 检索质量（Hit@4 / MRR，分语义 / 关键字 / RRF / Rerank 四个阶段对比）、L3 Text2Cypher 有效率、L4 答案要点覆盖率（LLM-as-judge）。
- **优化实证**：邻居窗口取 W=2 时，答案要点覆盖率从 55.6% 提升至 67.4%（12 题 × 3 轮取均）。
- **主观质量评估**：接入 LangSmith + OpenEvals 做忠实度 / 有用性 / 检索相关性 / 正确性四维打分，并将评委模型与被测模型分离以降低打分方差。

**项目三 · 对话式 BI 数据看板**

**项目地址**：http://139.224.212.216:8001

_用自然语言查询电商经营数据：提问 → Vanna RAG 检索训练上下文 → 大模型写 SQL → 查 MySQL → 返回交互式图表 + 一句话总结；并支持语音问数与自然语言定时报表。_

**技术栈**：Python 3.12、Vanna 0.7.9、ChromaDB、deepseek-v4-flash、MySQL、React + Ant Design X + AntV GPT-Vis、APScheduler、SQLGlot、腾讯云 ASR / TTS、MCP

**核心工作**：

- **Text2SQL RAG**：把 DDL（运行时自动 SHOW CREATE TABLE 抽取）+ 业务口径文档 + 示例 SQL 问答对「训练」进向量库，提问时按相似度检索拼进提示词，显著提升复杂多表 SQL 的生成准确率；底层为电商星型模型 7 张表（5 万订单 / 12 万明细 / 2 万会员）。
- **数据权限切片**：用 SQLGlot 在 vn.run\_sql 这一唯一执行口子上做只读校验 + 表级白名单 + orders 行级 RLS；权限规则不进提示词，从而抵御 prompt 注入——即便用户诱导模型"忽略权限"，SQL 进库前仍被 AST 闸门拦截。
- **语音问数**：腾讯云 ASR 一句话识别 + 流式 TTS 口播总结（SSE 边生成边合成边播放），处理三线程（WS / SSE / 云回调）共写一条连接的同步问题与协议签名鉴权。
- **自然语言定时任务**：APScheduler（cron / interval / at 三种触发）+ Function Calling 工具循环（time\_now / query\_bi / send\_mail / cron\_job 四工具），用户一句"每天 9 点把昨天 GMV 发我邮箱"即可建任务。
- **MCP 语音点咖啡**：零依赖自实现极简 MCP client（JSON-RPC 2.0 over Streamable HTTP）直连瑞幸远端 MCP，配合 Function Calling 完成多轮咖啡点单。数据看累了顺口点杯咖啡。
- **交互式出图**：前端用纯启发式规则出图（有日期列→折线 / 类目少→饼图 / 否则柱状），省掉一次大模型调用、降低成本与出错面。

**SQL 准确率评测与优化**：自建 20 题 hold-out 评测集（刻意不与训练示例重复），独立脚本 eval\_text2sql.py 做执行准确率判分（gold 与模型 SQL 同库执行、比对结果集，行序/列序无关，不用 LLM 当裁判——与 Spider 等 benchmark 通行做法一致，可复现）。首轮优化（业务口径文档细化：GMV 订单级 vs 明细级维度、temperature=0 等）达 19/20（95%）；针对「各会员等级复购率」分母口径补 few-shot + 文档约束后，提升至 20/20（100%）。叠加 DDL 中文注释与执行端 SQLGlot AST 防护，多重收敛幻觉、保障可执行性与正确性。

**工作经历**

**中国联通上海分公司 ｜ Web 前端开发工程师 ｜ 2021.04 – 至今**

- 负责「集约化 App」（承载电信订单系统）、中台管理系统与大屏数据可视化的开发迭代，主导基础架构搭建与公共能力封装。
- 工程化重构（Webpack → Vite）：主导集约化 App 老构建工程迁移至 Vite，本地开发启动从 5 分钟缩短到 5 秒、CI 流水线构建打包从 20 分钟缩短到 5 分钟，显著提升团队研发与发布效率。
- 老订单系统重构：将老架构难以维护的耦合工程改造为新架构 动态渲染页面——「服务端配置驱动」的动态表单渲染引擎（Vue3），将后端下发配置递归渲染为 input/select/date 等控件并按规则触发多级属性联动。性能优化以 shallowRef / toRaw 规避大批配置数据的深层响应与依赖收集开销，按字段粒度精准控制响应性；用 Proxy 统一代理请求做重复过滤与数据持久化。
- 低版本浏览器兼容与老项目安全漏洞修复，沉淀团队通用基础设施。

**上海复娱文化传播有限公司 ｜ Web 前端开发工程师 ｜ 2018.09 – 2021.04**

- 内嵌于安卓客户端的游戏下载 App（H5），并承接游戏官网 / 介绍页 / SDK 开发，接入 Twitter / Facebook / Twitch / Line 第三方登录。下载进度首版用 jQuery 手动操作 DOM 实时更新——同一游戏跨多个排行榜重复出现、同一进度需 for 循环在多处同步渲染同一 canvas 实例，并发下载多款游戏时切 tab 卡顿达 2 秒；改用 Vue2 数据驱动重构后，渲染交由框架统一调度，tab 切换从 2 秒优化到「秒切」。
- 独立搭建并开发英超狼队（Wolverhampton）广告投放平台（PC / H5）：广告创建、后台运营管理、Echarts 数据报表，接入 Google / Facebook 登录与 PayPal 支付。
- 独立开发「i 狼队」微信小程序（新闻 / 赛事 / 活动 / 会员 / 积分）：分包加载与预加载、赛事竞猜与倒计时、微信地址与手机号认证登录。

**上海赛可电子商务有限公司 ｜ Web 前端开发工程师 ｜ 2017.08 – 2018.08**

- 负责新车电商官网各产品 / 活动页面的开发与迭代，并持续做优化总结与团队技术分享。
- 新车介绍页性能优化：顶部轮播原依赖 Swiper 插件、包体偏重、首屏加载约 2 秒；从提升用户留存出发，手写原生轮播替换插件、去除整包依赖，首屏加载提速约 500ms。

**教育背景**

四川工程职业技术大学 ｜ 大专 ｜ 计算机科学与技术 ｜ 2010–2013

**自我评价**

勤奋朴实，喜欢技术，会持续跟进大模型与 Agent 前沿，注重以评测数据驱动优化、以工程规范保障交付。

工作之外保持健身和阅读习惯，对前沿 AI 技术抱有持续的热情。
