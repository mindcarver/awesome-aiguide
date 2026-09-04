# 参考资源与延伸阅读：harness engineering 该去哪挖

> 前五篇把概念、项目、评测、趋势、实战路径讲完了，这一篇是「资源索引」。
> 把这个专题依赖的核心资料（系统课程、带可跑代码的开放指南、持续更新的策展清单）和值得继续深读的一手博客、中文实战资料集中在一处，方便长期收藏与回溯。
> 不是 02 篇具体项目清单的重复，而是更高一层的「综合资源入口 + 原始文献」导航。

## 一、综合资源：课程 · 开放指南 · 精选清单

如果只收藏三个入口，就这三个。它们分别代表 harness engineering 的三种资料形态：系统课程、带可跑代码的开放指南、持续更新的策展清单。

- **[learn-harness-engineering](https://github.com/walkinglabs/learn-harness-engineering)**（walkinglabs，14 语言含简体中文，MIT）—— 一门从 0 到 1 的项目制课程：12 讲概念 + 6 个动手项目，全部围绕同一个 Electron 知识库 App 演进（P(n+1) 的起点 = P(n) 的答案）。核心心智是「harness 五大子系统：Instructions / State / Verification / Scope / Lifecycle」，并随附一个 `harness-creator` skill，能在几分钟内给真实项目脚手架出 `AGENTS.md` + `init.sh` + `feature_list.json` + 验证流程。适合想被系统性带一遍、从原理到落地完整走通的人。
- **[harness-engineering-guide](https://github.com/nexu-io/harness-engineering-guide)**（nexu，MIT，网站 harness-guide.com 有中文站）—— 一份强调「每篇都附可复制运行的真实代码」的开放指南。从 50 行 Python 写出第一个 harness、harness vs framework 的决策树，讲到 agentic loop、工具系统 / MCP、两层记忆、guardrails、context engineering、sub-agent、多智能体编排、长程 harness 设计、managed agents、classifier-based permissions，以及「16 个 Claude 并行造出 10 万行 C 编译器」这类硬核案例。适合不想只看概念、想照着代码动手的人。
- **[awesome-harness-engineering](https://github.com/ai-boost/awesome-harness-engineering)**（ai-boost，CC0）—— 这个领域目前最全的策展清单（也是 05 篇推荐的长期书签）。按「要解决的问题」而非「厂商」组织：Foundations / Agent Loop / 规划 / 上下文投递与压缩 / 工具设计 / Skills & MCP / 权限授权 / 记忆与状态 / 编排 / 验证 & CI / 可观测 / 调试 / 人在环 / 参考实现 / 安全沙箱 / Evals / 模板 / 生产基础设施。每条都附 1-2 句「为什么值得读」的判断。适合当发现新工具、新论文的入口。

> 三者关系：想被系统带着学 → learn-harness-engineering；想照着代码动手 → harness-engineering-guide；想长期跟踪新资源 → awesome-harness-engineering。互补，不重复。

## 二、一手博客：从定义到实战

下面这些是前面正文没展开细讲、但属于「一手 canonical、且每篇都给了一个可直接用的判断或数据」的高价值文章。按「是什么 / 怎么实战 / 怎么度量」分组。

### 是什么（定义性文献）

- **[Harness engineering: leveraging Codex in an agent-first world](https://openai.com/index/harness-engineering/)**（OpenAI）—— 让「harness engineering」这个词正式出圈的文章。核心论点：同一个模型，在 well-harnessed 的仓库里从「不可靠」变成「可靠」，是质的跃迁而非边际改进。本专题 01 篇核心命题的来源之一。
- **[Unrolling the Codex agent loop](https://openai.com/index/unrolling-the-codex-agent-loop/)**（OpenAI）—— 把 Codex CLI 的 agent loop 逐层拆开：prompt 怎么拼装、如何调 Responses API、用 prompt caching 把二次采样从 O(n²) 降到线性、`/responses/compact` 自动压缩上下文。读「一个生产级 agent loop 内部长什么样」的最佳一手材料。
- **[The Anatomy of an Agent Harness](https://www.langchain.com/blog/the-anatomy-of-an-agent-harness)**（LangChain）—— 给 harness 的形式定义（Agent = Model + Harness），并从「模型做不到什么」反推出五大原语：filesystem（最基础）、code execution、sandbox、memory、context management。05 篇引用过的子栈版本背后的官方原文。

### 怎么实战（生产级案例）

- **[Harness design for long-running application development](https://www.anthropic.com/engineering/harness-design-long-running-apps)**（Anthropic Labs）—— 与「Effective harnesses for long-running agents」是两篇不同文章。这篇讲用 GAN 启发的 planner / generator / evaluator 架构 + 上下文重置（区别于 compaction）+ 怀疑式外部评估器，让 Claude 在数小时多会话里自主产出全栈应用。长程任务设计的标杆。
- **[Continually improving our agent harness](https://cursor.com/blog/continually-improving-agent-harness)**（Cursor）—— Cursor 团队的 harness 迭代方法论：从静态上下文护栏转向动态上下文拉取，用 CursorBench + 在线 A/B（Keep Rate、LLM 判满意度）+ 异常检测三层测量驱动改进，并按模型分别定制 prompt 与工具形状。工业级「harness 怎么持续改进」的范本。
- **[How we build and use Azure SRE Agent with agentic workflows](https://techcommunity.microsoft.com/blog/appsonazureblog/how-we-build-and-use-azure-sre-agent-with-agentic-workflows/4508753)**（Microsoft）—— 2026 年最有数据支撑的生产级 harness 案例：Azure SRE Agent 用「用 agent 构建 agent」的方式，自主处理 35,000+ 生产事故、节省 20,000+ 工程小时，把 Azure App Service 平均缓解时间从 40.5 小时压到分钟级。
- **[Context Engineering for Reliable AI Agents: Lessons from Building Azure SRE Agent](https://techcommunity.microsoft.com/blog/appsonazureblog/context-engineering-lessons-from-building-azure-sre-agent/4481200/)**（Microsoft）—— 同团队的上下文工程复盘：把 100+ 个窄工具合并为少数宽 CLI、收敛到单 agent、用文件系统承载工作记忆并引入代码执行与 compaction，把 Intent Met 指标从约 45% 提到 75%。是 context engineering 落地的硬数据。
- **[Harness Engineering: How to Build Reliable AI Agents by Engineering the System, Not the Model](https://www.deepset.ai/blog/harness-engineering)**（deepset / Haystack 团队）—— 给 harness 四层定义（Context / Tools / Orchestration / Guardrails & verification）和按出错层分类的失败分类法（context / constraint / verification / planning failure），并展示「只改 harness、不换模型」能让 agent 排名提升 20+ 位。

### 怎么度量（评测与基础设施）

- **[Improving Deep Agents with Harness Engineering](https://www.langchain.com/blog/improving-deep-agents-with-harness-engineering)**（LangChain）—— 目前最具体的「harness 设计是性能主杠杆」的已发表证据：不换模型，只改 harness（结构化验证循环 + 上下文注入 + loop 检测中间件 + 在规划/验证阶段集中思考的「推理三明治」），把编程 agent 在 Terminal Bench 2.0 从约 Top 30 拉进 Top 5。
- **[The Coding Harness Behind GitHub Copilot in VS Code](https://code.visualstudio.com/blogs/2026/05/15/agent-harnesses-github-copilot-vscode)**（VS Code 团队）—— 把 harness 拆成三大职责（context assembly / tool exposure / tool execution）+ agent loop，提出「model is the engine, harness is the car」，并用自建 VSC-Bench + PR 自动 eval 评估每个 harness 改动。「把 harness 改动当代码 review 对象」的清晰范本。

> 更多一手文献（Anthropic 的 effective-context-engineering、demystifying-evals、Building Effective Agents，Martin Fowler 站点的 harness-engineering，Simon Willison 的 agentic loops，Hamel Husain 的 evals 等）已散见 01-05 篇正文，不在此重复。

## 三、中文实战资源

英文一手文献之外，这几个中文资料有独立价值（不是单纯翻译转载）：

- **[智能体 Harness 工程指南（GitBook）](https://yeasy.gitbook.io/harness_engineering_guide)** —— 一本中文开源电子书，以 Codex / Claude Code / OpenClaw 为参考系统，全书贯穿一个从零用 Python 实现的 MiniHarness 实战项目，覆盖运行时引擎、工具层、记忆、编排、MCP、安全等 14 章。适合想要「中文 + 完整可跑示例」系统读物的读者。
- **[《御舆：解码 Agent Harness——Claude Code 架构深度剖析》](https://linux.do/t/topic/1870593)**（LINUX DO）—— 用「舆 / 辕 / 辐 / 軎辖」的马车比喻，系统拆解 Claude Code 51 万行 TypeScript 源码里的对话循环、工具系统、权限管线。少见的「读真实生产 agent 源码」的中文实战资料。
- **[Harness 工程的基本理解与 Multi-Agent 的区别](https://linux.do/t/topic/2069391)**（LINUX DO）—— 作者基于「50+ 亿 token 实践」澄清一个常见误区：harness 里的「规则 / 生成 / 验证」三段不一定是 agent，可以是 skill / hook / tool，本质是责任体划分，与 multi-agent 是正交概念。适合读完后想避免概念混淆的人。

## 四、怎么用这些资源

- **想被系统带一遍（1-2 周）**：learn-harness-engineering 课程 → 概念模糊时查本专题 01 篇 → 跑完 6 个项目后用 Azure SRE / Cursor / LangChain Deep Agents 三篇对照「生产里 harness 长什么样」。
- **想照着代码动手（几天）**：harness-engineering-guide 的「50 行第一个 harness」→ 05 篇的 minimal-agent-tutorial → 做减法理解工具设计。
- **想长期跟踪（收藏即用）**：awesome-harness-engineering 当书签（按问题分类查）+ 本专题按需回查。
- **想做中文分享 / 内部培训**：GitBook 中文指南 + 御舆源码剖析当素材，配合本专题的「五大共识 / 三大争议」框架。

这个专题到这里结束。回到 [系列总览](./README.md)，或继续读本仓库的 [Claude Code](../claude-code.md) / [Codex](../openai-codex.md) 工程化系列，看 outer harness 在具体工具里怎么落地。
