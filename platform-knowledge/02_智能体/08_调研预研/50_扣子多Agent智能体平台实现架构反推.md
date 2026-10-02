---
module: 智能体
topic: 扣子（Coze Studio）多 Agent 智能体平台实现架构反推
desc: 基于公开证据（Coze Studio 开源仓库+DeepWiki 结构化解析+扣子官方文档）的逆向架构分析：平台分层、多 Agent 编排、工作流引擎、知识库/RAG、插件生态与部署架构，🟢实证/🟡推断置信度分级标注；为自建多 Agent 平台（eino-multiagent-lab）提供架构参照。
synced: 2026-10-02
---

# 扣子（Coze）多 Agent 智能体平台实现架构反推

> **文档性质：** 基于公开证据的逆向架构分析（Reverse-Engineered Architecture），非官方架构披露
> **反推日期：** 2026-09-15
> **主要证据源：** Coze Studio 开源仓库（coze-dev/coze-studio，2025-07 开源）及其 DeepWiki 结构化解析、扣子官方文档（docs.coze.cn）、多篇源码分析
> **面向读者：** 需要理解/自建多 Agent 平台架构的工程师，以及在做"运维本体 + Agent"平台设计的团队
> **置信度说明：** 全文严格区分三类结论——
> - 🟢 **【实证】**：开源仓库源码 / 官方文档可直接证实
> - 🟡 **【推断】**：由开源架构 + 产品行为合理反推，未被源码直接证实
> - 🔴 **【黑盒】**：SaaS 商业版闭源部分，只能依据产品现象推测，不作为事实

---

## 0. 一句话结论

扣子的本质是一套 **"可视化 Agent IDE + DDD 分层单体后端 + 图编排运行时（Eino）+ 可插拔基础设施"** 的平台。它的"多 Agent"不是单一技术，而是**三个不同层级**的能力叠加：

1. **单 Bot 内多 Agent 编排**（开始节点路由 + 子 Agent 节点 + 全局跳转），本质是一张**带条件跳转的对话状态图**；
2. **单 Agent 自主规划**（ReAct + Function Calling 自动选择工具/工作流），是大多数场景的默认形态；
3. **项目级"AI 团队"协作**（多人 + 多 Agent 共享项目空间，@ 派单、云端/本地 Agent 统一调度），这是开源版没有、SaaS 版才有的**消息总线 + 任务派发 + 异构 Agent 托管**层。

理解这三层的边界，就理解了整个平台。

---

## 1. 反推目标、范围与方法

### 1.1 反推目标

从扣子对外可见的产品形态（Agent、工作流、插件、知识库、记忆、多 Agent 协作、云设备、渠道发布等）反推出：

- 系统由哪些子系统/服务构成，职责如何切分；
- 一次"用户发消息 → 多 Agent 协作 → 工具/工作流执行 → 流式返回"在后端如何流转；
- Agent、工作流、插件、知识库、记忆在数据模型与运行时上如何组织；
- 哪些是开源已证实的工程底座，哪些是商业版闭源增量；
- 自建同类平台（含运维本体 Agent）时哪些设计可直接借鉴。

### 1.2 范围界定

| In Scope（本报告覆盖） | Out of Scope（不展开） |
|---|---|
| 后端 DDD 分层、领域模块、跨域防腐层 | 字节内部具体集群规模、真实 QPS/成本 |
| Eino 图编排运行时、ReAct、Checkpoint | 商业版多租户计费的内部账务实现 |
| 工作流引擎、插件/技能/MCP、知识库 RAG、记忆 | 火山引擎底层大模型训练推理基础设施 |
| 单 Bot 多 Agent 编排机制、项目级 AI 团队协作反推 | 海外 coze.com 与国内版的合规差异细节 |
| 数据存储选型、事件驱动、沙箱、流式推送 | 具体商业化运营策略 |

### 1.3 反推方法论与可信度边界

```
证据强度从强到弱：
  开源源码/目录结构/IDL  ──►  🟢 实证（开源版能力）
  官方产品文档对行为的描述  ──►  🟢 实证（产品行为）但实现为推断
  DeepWiki 对仓库的结构化解析 ──► 🟢/🟡（二手但直接对应源码）
  第三方源码分析博客        ──► 🟡（需与官方源交叉验证）
  由产品现象反推内部机制     ──► 🟡/🔴（明确标注）
```

**关键边界声明：** 开源 Coze Studio 是商业扣子的"核心引擎开源化改造版"，二者**同源但不等价**。开源版定位个人空间、单机/私有化部署；SaaS 版在其上叠加了多租户、团队协作、AI 团队、云设备、渠道、计费、应用型智能体、多模态等大量闭源能力。因此：

> 凡是开源仓库中存在的模块，可视为商业版的"地基"，置信度高；凡是开源版明确没有、而 SaaS 版有的能力（如项目级多 Agent、三方/本地 Agent 托管），其内部实现属于 🟡/🔴。

---

## 2. 证据台账

| ID | 事实/观察 | 来源 | 置信度 | 用于章节 |
|---|---|---|---|---|
| E1 | 后端 Go 1.24 + CloudWeGo Hertz，DDD 分层（api/application/domain/infra/crossdomain） | coze-studio 仓库、DeepWiki Backend System | 🟢 | 3、4 |
| E2 | AI 编排运行时为 CloudWeGo Eino（compose 图、Runnable、Checkpoint），单 Agent 用 `flow/agent/react` | DeepWiki、掘金源码分析 | 🟢 | 5、6 |
| E3 | 存储：MySQL(GORM/Atlas 迁移)、Redis、Elasticsearch、Milvus/OceanBase 向量库、MinIO/S3、etcd | DeepWiki Architecture、docker-compose | 🟢 | 8 |
| E4 | 消息总线 EventBus 抽象 Producer/Consumer，实现可对接 NSQ/RocketMQ/NATS/Pulsar；开源默认 NSQ | 掘金（infra/eventbus 接口）、DeepWiki | 🟢 | 4、8 |
| E5 | 代码节点用 Python 沙箱（Deno + sandbox.py）执行；文档解析（PDF/DOCX）走 Python 环境 | DeepWiki Infra Adapters | 🟢 | 7、9 |
| E6 | 前后端契约用 Thrift IDL，Kitex 生成 Go 桩，idl2ts 生成前端 TS 类型 | DeepWiki IDL | 🟢 | 4 |
| E7 | 前端 React18 + TS monorepo，Rush + pnpm，135+ 包；工作流画布 FlowGram；状态 Zustand+Immer | 阿里云开发者社区、CSDN | 🟢 | 4 |
| E8 | domain 子域：agent(singleagent)、workflow、conversation、knowledge、memory、plugin、prompt、modelmgr、search、app、user | 掘金目录树、DeepWiki | 🟢 | 4 |
| E9 | 工作流执行返回 ExecuteID/Data/Token/Cost/DebugUrl；异步只返回 execute_id 供轮询 | 掘金源码（工作流执行响应） | 🟢 | 6 |
| E10 | 多 Agent 模式：开始节点(分发策略) + Agent 节点 + 智能体节点(引用已发布 Bot) + 全局跳转条件(≤5)；一个 Bot 最多 100 个 Agent | 官方文档 guides_multiagent、API 文档 | 🟢 | 5 |
| E11 | 路由依据"适用场景"自然语言描述由 LLM 判定；全局跳转优先级高于适用场景 | 官方文档 | 🟢 | 5 |
| E12 | 新一轮分发策略：回"上一次回复节点"或回"开始节点" | 官方文档 | 🟢 | 5 |
| E13 | AI 团队：项目空间隔离对话/文件/资产，@Agent 派单，支持云端扣子 Agent/三方精选 Agent/本地 Agent（OpenClaw、Claude Code、Codex CLI、Hermes） | 官方文档 AI 团队、Agent 概述 | 🟢（行为）/🟡（实现） | 5.3 |
| E14 | Agent 工作台能力：长期记忆、日程、邮箱、云电脑、云手机、技能、渠道、后台任务、文件 | 官方文档 Agent 能力对比表 | 🟢（行为） | 7 |
| E15 | RAG：多格式文档解析、自动分段、稠密+稀疏混合向量、增量更新 | CSDN 技术解析、DeepWiki(embedding 接口) | 🟢/🟡 | 7.3 |
| E16 | 开源版 vs SaaS：开源仅个人空间、约19个官方插件、无应用型智能体/多模态/团队协作 | GitCode 教程对比表 | 🟢 | 10 |
| E17 | 部署：Docker Compose 全栈（coze-server/coze-web + 中间件 + Nginx），生产用 Helm on K8s | DeepWiki、README | 🟢 | 9 |

---

## 3. 系统上下文视图（Context View）

### 3.1 系统上下文（ASCII）

```
                         ┌──────────────────────────────────────────────┐
                         │                    使用者                      │
                         │  终端用户(对话) / 创作者(搭建) / 团队成员(协作) │
                         └──────────────────────────────────────────────┘
                              ▲  Web/桌面/移动App + 开放API/SDK + Webhook
                              │ HTTPS / SSE 流式
        ┌─────────────────────┴───────────────────────────────────────────┐
        │                    扣子多 Agent 平台（信任边界）                   │
        │                                                                  │
        │  接入层   Nginx 网关 ── 鉴权/限流/多租户/国际化/CORS               │
        │  前端     Agent IDE / 工作流画布(FlowGram) / 项目协作 UI          │
        │  后端     Hertz API + DDD 分层单体 + Eino 编排运行时              │
        │  执行     代码沙箱 / RAG 流水线 / 插件与MCP调用 / 云设备执行       │
        └───┬───────────────┬───────────────┬───────────────┬──────────────┘
            │               │               │               │
     ┌──────▼─────┐  ┌──────▼──────┐ ┌──────▼──────┐ ┌──────▼─────────┐
     │ 大模型服务  │  │ 数据与存储    │ │ 消息/任务    │ │ 外部生态        │
     │ 豆包/方舟   │  │ MySQL/Redis/ │ │ MQ(NSQ等)/  │ │ 三方插件API/    │
     │ OpenAI/Claude│ │ ES/Milvus/  │ │ 定时日程/    │ │ MCP Server/     │
     │ Qwen/Gemini │ │ MinIO/etcd  │ │ 后台任务     │ │ 飞书·微信渠道/  │
     │ 本地Ollama  │  │             │ │             │ │ 本地Agent(Claude │
     └─────────────┘  └─────────────┘ └─────────────┘ │ Code/Codex/OpenClaw)│
                                                       └──────────────────┘
```

### 3.2 三类外部交互与信任边界

| 交互对象 | 方向 | 协议/形态 | 信任边界要点 |
|---|---|---|---|
| 浏览器/客户端 | 入/出 | HTTPS + SSE（流式 token） | 网关鉴权、会话隔离、积分限流 |
| 大模型提供商 | 出 | 各家 Chat/Embedding API，统一经 Eino Model 抽象 | API Key 托管、模型元数据配置（conf/model） |
| 三方插件 / MCP Server | 出 | HTTP / MCP（stdio、streamable-http、SSE） | 出网白名单、OAuth/AK-SK 凭证托管、超时与降级 |
| 渠道（飞书/微信等） | 双向 | Webhook / 平台开放 API | 渠道消息适配、签名校验 |
| 云设备 / 本地 Agent | 双向 | 长连接 + 任务派发/回告 | 设备注册、权限作用域（授权文件夹）、执行结果回传 |

---

## 4. 总体分层架构（Component View）

### 4.1 后端：单体内的"微服务化模块"（Modular Monolith + DDD）🟢

开源版后端是**一个可编译为 `opencoze` 的单体二进制**，但内部严格按 DDD 切分成高内聚模块。这种"模块化单体"是非常典型的演进式架构——先用单体降低运维与分布式复杂度，再以领域边界为未来拆服务预留缝。

```
┌───────────────────────────────────────────────────────────────────────┐
│  API 层  backend/api                                                    │
│  Hertz HTTP Server：router / handler / middleware / api model          │
│  · 中间件链：CORS、日志、鉴权、国际化、限流、Trace                         │
│  · handler/model 大量由 Thrift IDL 生成，保证前后端契约一致               │
├───────────────────────────────────────────────────────────────────────┤
│  Application 层  backend/application（用例编排 / 事务边界）              │
│  app · conversation · workflow · knowledge · memory · plugin ·         │
│  modelmgr · prompt · search · singleagent · user                        │
│  Init() 构建 basic / primary / complex 三类 ApplicationService          │
├───────────────────────────────────────────────────────────────────────┤
│  Domain 层  backend/domain（核心业务逻辑、实体、领域服务）               │
│  agent(singleagent/agentflow) · workflow(compose) · conversation ·      │
│  knowledge(RAG) · memory · plugin · prompt · modelmgr · search ...      │
│            ▲ 这里内嵌 Eino：ReAct Agent 图 / Workflow 节点图 / 状态机     │
├───────────────────────────────────────────────────────────────────────┤
│  Crossdomain 防腐层  backend/crossdomain（ACL）                         │
│  contract(接口) + impl(适配)：crossworkflow / crossagent /              │
│  crossconversation ... 避免域之间直接依赖实现                            │
├───────────────────────────────────────────────────────────────────────┤
│  Infrastructure 层  backend/infra（外部依赖适配器，可插拔）             │
│  rdb(GORM) · cache(Redis) · search(ES) · vector(Milvus/OceanBase) ·     │
│  storage(MinIO/S3) · eventbus(MQ) · embedding · imagex ·                │
│  checkpoint · sse · 文档解析 · Python沙箱                                │
└───────────────────────────────────────────────────────────────────────┘
        IDL 层 idl/*.thrift（Kitex→Go，idl2ts→TS）   pkg/(logs/errorx/safego/ctxcache)
```

**这种分层解决的关键问题：**

- **依赖方向单向**：api → application → domain ← infra（依赖倒置，domain 定义接口、infra 实现），保证核心逻辑可测试、可替换中间件；
- **防腐层（crossdomain）**：多个领域（如 agent 要调用 workflow、conversation 要调用 knowledge）不直接 import 彼此的实现，而是依赖跨域契约。这是让"工作流既能被 Agent 调用、也能独立运行、还能被其他 Bot 嵌套"而不产生意大利面依赖的关键；
- **基础设施可插拔**：eventbus、embedding、vector store、storage 都是接口 + 多实现，所以同一套内核能从 Docker Compose（NSQ/MinIO/Milvus）平滑切到企业环境（RocketMQ/S3/OceanBase）。

### 4.2 前端：React Monorepo 五层分包 🟢

```
Layer1  apps/coze-studio            应用入口
Layer2  IDE 包    agent-ide / project-ide     ← Agent 编排 IDE、项目协作
Layer3  核心系统   workflow / studio / data    ← 工作流、画布、数据层
Layer4  基础/通用  状态store、账号、通用组件库
Layer5  架构层    bot-api / bot-http / idl / i18n  ← 由 IDL 生成的类型安全 API 客户端
```
工程体系：React 18 + TypeScript + Rsbuild + Rush + pnpm（135+ 包），画布引擎 **FlowGram**，状态管理 **Zustand + Immer**。IDE 与画布是"配置即数据"——画布上的节点图最终序列化为一份 JSON DSL 提交给后端。

### 4.3 核心子系统全景与职责

| 子系统 | 职责（一句话） | 非职责 | 实证度 |
|---|---|---|---|
| **Agent 运行域** | 加载 Agent 配置，跑 ReAct 规划/工具循环，管理多 Agent 路由 | 不负责画布编辑 | 🟢 |
| **Workflow 引擎** | 把节点图 DSL 编译为 Eino 可执行图，调度节点、状态、断点 | 不做意图路由（那是 Agent 的事） | 🟢 |
| **Conversation 域** | 会话/消息/上下文窗口/消息状态 | 不做模型推理 | 🟢 |
| **Knowledge(RAG)** | 文档解析、切分、向量化、索引、混合检索 | 不决定检索结果如何进入 Prompt | 🟢 |
| **Memory 域** | 变量/长期记忆/数据库表的读写 | 不等同于会话历史 | 🟢 |
| **Plugin/Skill/MCP** | 工具元数据、凭证、调用协议、出网 | 不实现工具本身业务 | 🟢/🟡 |
| **ModelMgr** | 模型注册、路由、密钥、计费参数 | 不训练模型 | 🟢 |
| **Prompt 域** | 提示词模板、变量、智能优化 | — | 🟢 |
| **Search 域** | 资源/知识的检索聚合 | — | 🟢 |
| **EventBus/任务** | 异步解耦（索引、通知、后台任务） | — | 🟢 |
| **项目协作/AI团队** | 项目空间、成员/Agent 管理、@ 派单、异构 Agent 调度 | — | 🟡/🔴（SaaS 闭源） |
| **云设备/本地Agent** | 云电脑/云手机执行、本地 Agent 长连接托管 | — | 🔴（闭源） |

---

## 5. 多 Agent 运行时反推（本报告重点）

扣子的"多 Agent"要拆成三个机制看。

### 5.1 机制一：单 Agent 自主规划（默认形态）🟢

绝大多数 Agent 实际跑的是 **ReAct（Reason+Act）循环**，开源代码对应 `domain/agent/singleagent/internal/agentflow` 下基于 Eino `flow/agent/react` 的实现：

```
用户消息
   │
   ▼
组装上下文（系统提示词 + 记忆 + 用户变量 + 历史 + 知识/工具描述）
   │
   ▼
┌─────────────── Eino ReAct 循环 ───────────────┐
│  LLM 思考：是否需要调用工具/工作流/知识库？      │
│     │ 是 ──► Function Call（绑定的插件/工作流/  │
│     │         MCP/知识库检索）──► 拿到观测结果  │
│     │              │  把结果回填，继续思考       │◄┐
│     └──────────────┴──────────────────────────┘ │
│     │ 否（信息充分）                              │
│     ▼                                            │
│  生成最终回答 ──► SSE 流式吐字 ──► 结束           │
└──────────────────────────────────────────────────┘
```

- 工具以 **OpenAI Function/Tool Calling 风格的 schema** 暴露给模型；模型自主决定调哪个、传什么参数；
- 工作流、插件、知识库检索、数据库查询在这一层都被**统一抽象成"可调用工具"**——这就是"单 Agent 自主规划模式"能被称为"伪 Multi-Agent"的原因：它用一个 LLM + 一堆工具模拟了分工；
- Checkpoint 存 Redis，支持中断恢复（如需要人工确认/HITL 的场景）。

### 5.2 机制二：单 Bot 内的多 Agent 编排（画布式 Multi-Agent）🟢

这是文档里"多 Agent 模式"的严格定义。画布产物是一张**带条件转移的对话状态图**，由开始节点、若干 Agent 节点、（可选）已发布智能体节点、全局跳转条件组成。

#### 5.2.1 运行时状态机反推

```
                     ┌──────────────────────────────┐
                     │          开始节点 Start        │
                     │  分发策略（新回合起点决策）      │
                     │  ① 上一次回复的节点（会话粘性）  │
                     │  ② 开始节点（每轮重新路由）      │
                     └──────────────┬───────────────┘
            全局跳转条件先判定（≤5 条，优先级最高，通常关键词/规则匹配）
            ┌──────────┬───────────┴────────────┬──────────┐
            ▼          ▼                        ▼          ▼
      ┌──────────┐┌──────────┐             ┌──────────┐┌──────────┐
      │ Agent A  ││ Agent B  │             │ Agent C  ││ 已发布Bot │
      │ (轻量节点)││ (轻量节点)│ ...        │          ││ 节点(嵌套) │
      │ 提示词+技能││          │             │          ││ 复用完整   │
      └────┬─────┘└────┬─────┘             └────┬─────┘│ Bot能力   │
           │  适用场景(自然语言)交给 LLM 做路由选择  │      └──────────┘
           └──────────┬───────────────────────────┘
                      ▼
              被选中 Agent 内部各自再跑 5.1 的 ReAct 循环
                      │
                      ▼
              回答用户；记录本回合"活跃节点"供下回合分发使用
```

#### 5.2.2 路由决策的两种依据（关键设计）

| 路由机制 | 判定方式 | 优先级 | 特点 |
|---|---|---|---|
| **全局跳转条件** | 关键词/规则（确定性） | 最高，命中即跳 | 一个 Bot ≤5 个；用于快捷指令、强制转人工/投诉等高确定性场景 |
| **节点"适用场景"** | LLM 语义路由（概率性） | 次之 | 把子 Agent 的"名称 + 适用场景描述"拼成候选清单，让 LLM 选择交给哪个节点 |
| **会话粘性** | 状态（上一活跃节点） | 由分发策略决定 | 连贯任务保持在同一子 Agent，避免来回横跳 |

这套设计的精妙之处是 **"确定性规则兜底 + 语义路由为主 + 状态粘性纠偏"** 的三层路由，兼顾灵活性与可控性。

#### 5.2.3 两类子 Agent 节点的工程差异

- **轻量 Agent 节点**：只含提示词 + 基础技能，画布内联定义、无需单独发布。配置成本低，但不能挂复杂工作流/知识库——对应运行时是一个"内嵌 ReAct 单元"；
- **智能体节点（引用已发布 Bot）**：把工作空间里**独立发布、独立版本化**的单 Agent 作为子节点。它拥有自己完整的工作流/插件/知识库/数据库，是企业级复用单元。运行时本质是一次**跨 Agent 的嵌套调用（sub-agent invocation）**，通过 crossdomain 的 agent 契约发起，天然支持层级编排。

> 官方限制（实证）：一个 Bot 最多 100 个 Agent 节点、5 个全局跳转条件。这些上限反推出后端用**有界的图结构 + 受限扇出**来控制 token 成本与路由歧义。

#### 5.2.4 与工作流引擎的关系（极易混淆）

| 维度 | 工作流（Workflow） | 多 Agent 模式 |
|---|---|---|
| 解决的问题 | 一个任务内**确定性步骤**自动化 | "这句话该由谁处理"的**动态任务分配** |
| 图的边 | DAG，确定性数据流 | 带条件/语义跳转的状态转移图，可"回流" |
| 路由决策 | 选择器/条件节点（显式逻辑） | LLM 依据"适用场景"隐式语义路由 |
| 比喻 | 工厂自动化生产线 | 前台分诊 + 部门调度 |
| 运行时 | Eino compose Workflow | Eino ReAct 节点 + 路由状态机 |
| 嵌套 | Agent 可把工作流当工具调用 | 多 Agent 节点内部又可调用工作流 |

**统一底座推断（🟡）**：二者在产品层是两种画布，但在运行时很可能都编译为 Eino 的 `compose` 图——工作流是"确定性图"，多 Agent 是"每节点内嵌一个 ReAct 子图、边由路由器动态决定"的图。这与开源中"workflow 用 compose 建图、agentflow 用 react 子图"的代码组织一致。

### 5.3 机制三：项目级"AI 团队"多 Agent 协作（SaaS 闭源，重点反推）🟡/🔴

这是 2025 年后扣子主打的、**开源版完全没有**的形态：多人 + 多 Agent 在同一项目空间，@ 派单、共享上下文与文件、云端/本地 Agent 统一调度。根据官方文档描述的行为（E13/E14），反推其内部需要以下新增能力（实现为闭源，标注置信度）：

#### 5.3.1 反推的协作架构

```
┌──────────────────────── 项目空间（Project，隔离单元）────────────────────────┐
│  成员(人类) + 多个 Agent + 共享对话/文件/资产/产出                            │
│                                                                             │
│   项目消息流（类群聊）                                                       │
│   用户消息 ──► 协作编排服务(Orchestrator/Dispatcher)                         │
│                    │  解析 @ 目标 / 无@时由主路由决定谁来接                   │
│        ┌───────────┼───────────────────────────────┐                        │
│        ▼           ▼                               ▼                        │
│  ┌──────────┐ ┌──────────┐                 ┌──────────────────┐             │
│  │扣子原生   │ │三方精选   │                 │ 本地 Agent        │             │
│  │Agent(云端)│ │Agent(云设备)│               │ Claude Code/Codex/│             │
│  │Harness   │ │OpenClaw等 │                 │ OpenClaw/Hermes   │             │
│  └────┬─────┘ └────┬─────┘                 │ (跑在用户电脑)     │             │
│       │ 各自独立 session / 记忆 / 工具       └────────┬─────────┘             │
│       └───────────────┬──────────────────────────────┘                       │
│                       ▼                                                     │
│        结果回传项目消息流 + 产物落项目云盘 + 状态/进度同步                      │
└─────────────────────────────────────────────────────────────────────────────┘
   支撑子系统（推断）：成员/Agent目录服务 · 任务派单总线 · 上下文共享服务 ·
                     Agent 长连接网关(云设备/本地) · 权限与授权作用域 · 异步任务/回告
```

#### 5.3.2 反推的关键机制与证据对应

| 反推能力 | 支撑它的产品现象（实证） | 置信度 |
|---|---|---|
| **统一 Agent 目录与能力注册表** | 创建 Agent 后"加入项目"，项目设置里有独立"Agent 管理"开关 | 🟡 |
| **@ 寻址 + 消息派单** | "需要谁加入，@ 一下即可就位"，@ 指定不同 Agent 处理不同任务 | 🟡 |
| **共享上下文服务** | "不同 Agent 共享项目上下文，减少重复解释"；对话/文件/资产持续沉淀 | 🟡 |
| **异构 Agent 运行时适配层** | 同一入口托管扣子 Agent、云设备上的 OpenClaw/Claude Code/Codex/Hermes、以及本机本地 Agent | 🟡（必然需要 adapter + 长连接网关） |
| **本地 Agent 通道** | 本地 Agent 可访问本机文件/代码/系统资源；三方精选跑在云电脑 24h 在线 | 🔴 内部协议未公开 |
| **异步任务 + 完成回告** | Agent 可后台执行长任务、异步推送结果（与"后台任务""日程"能力对应） | 🟡 |
| **人在环决策** | "人负责判断和决策，Agent 负责执行"，成员可补充/评审/确认 | 🟡 |

#### 5.3.3 三种多 Agent 形态对比（一张表收束）

| | 单 Agent 自主规划 | 单 Bot 多 Agent 编排 | 项目级 AI 团队 |
|---|---|---|---|
| 协作单位 | 1 个 LLM + N 个工具 | 1 个 Bot 内 N 个子 Agent | 1 个项目内 N 个独立 Agent + M 个人 |
| 路由主体 | Agent 自己（Function Call） | 开始节点 LLM 路由 + 全局规则 | 人 @ 指定 / 主编排器 |
| 上下文 | 单会话 | 单 Bot 会话内共享 | 项目级跨会话共享文件/资产 |
| Agent 是否独立 | 否（工具不是 Agent） | 轻量节点否；Bot 节点是 | 完全独立、独立设备/记忆/框架 |
| 生命周期 | 随对话 | 随 Bot 发布版本 | 长期、跨任务、可后台/定时 |
| 开源版是否有 | 🟢 有 | 🟢 有（画布机制） | 🔴 无（SaaS 闭源） |
| 典型场景 | 90% 日常任务 | 客服分诊、翻译、虚拟软件公司 | 真实团队协作、复杂项目流水线 |

---

## 6. 关键运行时流程（Runtime View）

### 6.1 端到端对话时序（含工具/工作流调用）

```
用户 → 网关 → Conversation应用服务
  1. 鉴权/限流/多租户；取或建会话(conversation)
  2. 载入 Agent 配置（提示词版本、模型、绑定的技能/知识库/记忆变量）
  3. 组装上下文：系统提示 + 长期记忆(memory) + 历史消息 + 用户变量
  4. 经 crossagent 进入 domain/agent，编译/取 Eino ReAct Runner
  5. ReAct 循环：
       LLM(modelmgr 路由到具体模型) → 决策
       若调用：
         · 插件   → infra 出网调用（凭证托管/超时/重试）
         · 工作流 → crossworkflow 起一个 Workflow 执行（见 6.2）
         · 知识库 → knowledge 混合检索（ES 全文 + Milvus 向量）
         · 代码   → Python 沙箱
       观测回填，继续；否则生成答案
  6. 通过 infra/sse 以 SSE 流式回推 token
  7. 异步落库：消息、token 用量、记忆更新、Trace；事件经 EventBus 发布
```

### 6.2 工作流执行与断点恢复 🟢

工作流执行响应体（实证 E9）含 `ExecuteID / Data / Token / Cost / DebugUrl`，且异步模式只返回 `execute_id + debug_url` 由客户端轮询。反推执行模型：

```
画布JSON(DSL) ──编译Compile──► Eino compose Runner（节点图 + LocalState）
                                   │
              CheckpointStore(Redis) 记录每节点状态 ── 支持中断/续跑/单步调试
                                   │
        节点执行：LLM / 选择器(条件) / 意图识别 / 代码(沙箱) /
                  插件 / 知识检索 / 数据库 / 循环(数组批处理) / 开始/结束
                                   │
        同步：直接返回 Data；异步：返回 execute_id，完成后回写结果供轮询/回调
```

- `debug_url` 说明运行态与 IDE 调试态共用一套执行/追踪后端，可按 ExecuteID 重放；
- `Cost` 在开源版固定 `"0.00000"`（预留计费字段），SaaS 版在此接入积分/计费；
- 节点图具备**幂等 + 重试 + 并行分支 + 循环**能力（产品层可见并行、循环节点）。

### 6.3 多 Agent 路由时序（机制二）

```
新消息 → Start节点
  → 先匹配全局跳转条件（确定性，命中直接跳到目标Agent）
  → 未命中：读取分发策略
        · "上次节点"：直接把消息交给上一活跃子 Agent
        · "开始节点"：LLM 依据各子 Agent 的(名称+适用场景)候选集做语义路由
  → 目标子 Agent 内部跑独立 ReAct（可有自己的工作流/知识库/插件）
  → 输出；记录活跃节点；前端用"绿色标签"显示是哪个 Agent 回复（实证）
```

---

## 7. 关键子系统设计反推

### 7.1 插件 / 技能 / MCP（工具系统）

| 层 | 形态 | 运行时反推 | 置信度 |
|---|---|---|---|
| 插件 Plugin | 封装好的 API/工具；可在 Coze IDE 用 Python/Node 编写 | 工具元数据 + 参数 JSON Schema 注册；调用走统一 Tool 接口；凭证（OAuth/AK-SK）集中托管；代码型工具进沙箱 | 🟢 |
| 技能 Skill | 结构化能力包（SKILL.md + 资源 + 脚本），按需加载 | 比插件更重的"说明书+资源+可执行脚本"，运行时把指令注入上下文、脚本在受控环境执行；支持技能商店分发/计费 | 🟡 |
| MCP | 标准 Model Context Protocol（stdio / streamable-http / SSE） | 作为外部 Tool Server 接入，复用统一工具调用与凭证/OAuth 框架（开源 plus 分支与 SaaS 已支持） | 🟢/🟡 |

**统一抽象推断（🟡）**：插件、技能、MCP、工作流、知识库检索在"喂给 LLM 的工具表"层面被归一为同构的 Tool（name/description/input schema/invoke），这是 ReAct 能透明调用一切能力的前提。

### 7.2 模型管理（ModelMgr）🟢

- 模型以配置元数据注册（`backend/conf/model/` 模板），启动后需在管理后台配置至少一个模型 + API Key 才能运行 Agent；
- Eino 通过 `eino-ext/components/model/*` 适配 OpenAI/Claude/Gemini/Qwen/Ark(方舟豆包)/Ollama，**统一 ChatModel 接口**，因此可热切换模型；
- Embedding 同理有统一 `Embedder` 接口，支持稠密 + 稀疏混合向量（E15）；
- SaaS 版在此之上做模型路由、限流、积分计费（模型费用是独立计费项）。

### 7.3 知识库与 RAG 🟢/🟡

```
原始文件 → MinIO/S3 存储
   │
   ▼ Python 文档解析（PDF/DOCX/表格/图片OCR）
文档切分（自动分段 / 按标题层级 / 自定义）
   │
   ▼ Embedding（稠密）+ 可选稀疏向量
入库：Milvus/OceanBase（向量） + Elasticsearch（全文）+ MySQL（元数据/版本）
   │
   ▼ 检索：向量语义召回 + ES 关键词召回 → 融合排序(RRF类) → TopK
   │
   ▼ 注入 Agent/工作流上下文
支持增量更新、知识库作为独立检索节点/工具被调用
```
事件驱动（EventBus）用于"文件上传 → 异步解析建索引"，避免阻塞上传链路。

### 7.4 记忆（Memory）与变量 🟢/🟡

- 开源 domain 有独立 `memory` 子域；产品上记忆分**变量（数据库表/用户变量/会话变量）**与**长期记忆**；
- 推断分层：会话短期上下文（conversation/Redis）、长期画像与偏好（memory，跨会话）、结构化业务数据（数据库表/表节点）；
- SaaS 版"长期记忆"还能跨项目跟随 Agent（本系统设定即体现：记忆跟 Agent 不跟项目），并有独立记忆库计费。

### 7.5 日程 / 后台任务 / 主动触达 🟡/🔴

- 产品有"日程""后台任务""会议旁听""邮件"等能力，反推底层是 **定时调度器 + 异步任务队列（EventBus）+ 唤醒/回调机制**：到点唤起一个 Agent 会话，按工单描述执行，再推送结果；
- 长任务（视频生成、深度调研、云手机操作）走异步：提交 → 后台执行 → 完成通知/回告，与工作流异步 `execute_id` 模式同构。

### 7.6 云设备与本地执行（闭源增量）🔴

云电脑/云手机/本地设备是 SaaS 版独有执行面。可反推其需要：设备注册与心跳长连接、设备侧 Agent 运行时（能跑 OpenClaw/Claude Code 等框架）、命令/脚本下发通道、屏幕/文件回传、权限作用域（授权文件夹）、远程浏览器/手机自动化。这是把"对话 Agent"升级为"能操作真实环境的 Agent（Computer-Use）"的关键，但内部协议未公开。

---

## 8. 数据视图（Data View）

### 8.1 存储分工（实证选型）

| 存储 | 角色 | 典型数据 |
|---|---|---|
| **MySQL** | 权威主库（GORM，Atlas 管迁移） | 用户/空间、Bot/Agent 配置版本、工作流 DSL、插件元数据、知识库元数据、会话/消息索引、权限 |
| **Redis** | 缓存 + Checkpoint + 热状态 | 会话热上下文、Eino 执行断点、限流计数、分布式锁 |
| **Elasticsearch** | 全文检索 | 资源搜索、知识库关键词倒排 |
| **Milvus / OceanBase** | 向量检索 | 文档切片 embedding |
| **MinIO / S3** | 对象存储 | 原始文档、图片、产物、模型/静态文件 |
| **etcd** | 协调/选租/配置（compose 中可见） | 服务协调类元数据 |
| **MQ（NSQ 默认）** | 异步事件 | 建索引、通知、任务、解耦 |

### 8.2 核心领域实体关系（反推）

```
Workspace(空间) 1───* Project(项目, SaaS) 1───* Member / Agent(成员关系)
Workspace 1───* Bot/AgentApp
Bot/AgentApp 1───1 编排配置(单Agent | 多Agent图 | 应用型)
多Agent图 1───* Node(Start/AgentNode/BotRef/GlobalJump) 1──* Edge(转移条件)
Bot/Agent 1───* Binding(插件|工作流|知识库|技能|记忆变量)
Conversation 1───* Message *───1 Bot/Agent；Message ── Token用量/Trace
Workflow 1───1 图DSL 1───* Node/Edge；WorkflowExecution 1───* NodeExecution/Checkpoint
KnowledgeBase 1───* Document 1───* Chunk ──► Vector( Milvus ) + Doc( ES )
```

### 8.3 一致性与生命周期要点

- **配置（MySQL）与运行态（Redis/向量库）分离**：画布编辑的是配置，发布产生不可变版本，运行态引用具体版本——支撑草稿/发布/回滚/调试并存；
- **解析建索引最终一致**：上传同步落库元数据，向量化异步追赶（EventBus）；
- **会话热数据 Redis、冷消息 MySQL**：兼顾延迟与成本；
- **多租户隔离（SaaS）**：空间/项目是资源与权限隔离的基本单元（开源版仅个人空间，故无此复杂度）。

---

## 9. 失败视图与非功能性设计（Failure / NFR View）

| 维度 | 反推机制 | 证据/依据 |
|---|---|---|
| **模型超时/出错** | 统一 Model 客户端做超时、重试、降级到备用模型；SSE 分段容错 | Eino 抽象 + 产品可用 🟡 |
| **插件/三方 API 故障** | 调用层超时/重试/熔断，错误结构化回灌让 Agent 自我兜底（社区实证"插件报错元字段兜底"） | 博客实证 + 推断 🟡 |
| **长任务中断** | Eino Checkpoint(Redis) 支持断点续跑；异步 execute_id 可重查 | 🟢 |
| **沙箱安全** | 代码节点在隔离 Python 沙箱（Deno 包裹）执行，限制文件/网络 | 🟢 E5 |
| **高并发** | Hertz/Netpoll 高并发、Redis 缓存、MQ 削峰、无状态服务水平扩展（K8s/Helm） | 🟢 E17 |
| **流式体验** | infra/sse 专门做服务端推送，首 token 延迟与全程解耦 | 🟢 |
| **可观测** | pkg/logs、Trace（SaaS 有 Trace 日志计费）、debug_url 按执行重放 | 🟢/🟡 |
| **多租户/权限** | 网关鉴权 + 空间/项目资源隔离 + 企业版功能访问控制 + Agent 授权作用域 | 🟢(文档)/🔴(实现) |
| **数据安全** | 数据安全能力/处理协议/DPA（合规页），凭证集中托管不进提示词 | 🟢(合规存在) |
| **部署** | Compose 全栈（开发/小规模）；Helm on K8s（生产）；可替换中间件 | 🟢 |

---

## 10. 开源版与 SaaS 商业版能力差（反推的"闭源增量层"）

| 能力 | 开源 Coze Studio | SaaS 扣子 | 反推的闭源增量 |
|---|---|---|---|
| 工作空间 | 仅个人空间 | 团队/企业空间 + 多租户 | 租户/组织/RBAC、资源配额 |
| 多 Agent | 单 Bot 画布式 | + 项目级 AI 团队（多人多 Agent） | 协作编排、消息派单、共享上下文 |
| Agent 运行环境 | 服务端 | + 云电脑/云手机/本地 Agent | 设备网关、异构 Harness 适配、长连接 |
| 应用形态 | 对话/工作流 | + 应用型智能体/AI 编程(vibe coding)/网页·移动·小程序 | 应用托管、部署服务 |
| 插件 | 约 19 个官方 + 自建 | 丰富插件市场/技能商店 | 市场、审核、结算分成 |
| MCP | plus 分支 | 原生支持 | MCP 生态接入 |
| 多模态 | 较弱 | 语音/图像/ASR/TTS/视频 | 多模态生成链路 |
| 主动能力 | 无 | 日程/邮箱/会议旁听/后台任务 | 调度器 + 任务/通知总线 |
| 渠道 | API/SDK | 飞书/微信/豆包等一键发布 | 渠道适配网关 |
| 计费运维 | 无 | 积分/席位/各类资源计费、SLA | 计费账务、可观测、SRE 体系 |

**反推的总体架构关系：**

```
         ┌─────────────────────── SaaS 闭源增量（多租户/协作/设备/渠道/计费/多模态/应用）─┐
         │  项目AI团队 · 云设备/本地Agent网关 · 应用托管 · 渠道网关 · 计费 · 合规        │
         ├──────────────────────────────────────────────────────────────────────────┤
         │           共享内核（与开源同源）：Hertz + DDD + Eino + Workflow + RAG       │
开源边界 ►│           api/application/domain/crossdomain + 可插拔 infra                │
         ├──────────────────────────────────────────────────────────────────────────┤
         │  MySQL · Redis · ES · Milvus · MinIO · etcd · MQ（NSQ/RocketMQ/...）        │
         └──────────────────────────────────────────────────────────────────────────┘
```

---

## 11. 关键技术选型与设计决策反推（含被放弃方案）

| 决策点 | 扣子的选择（实证/推断） | 推断的放弃方案 | 选择理由（反推） | 反转条件 |
|---|---|---|---|---|
| 后端形态 | DDD 模块化单体 | 一开始就全微服务 | 领域多但团队需快速迭代；模块化单体 + 防腐层先拿开发效率，保留拆缝 | 团队/规模到单库瓶颈再按域拆服务 |
| 语言/框架 | Go + Hertz(CloudWeGo) | Python/Java | 高并发 SSE、低内存、与字节 CloudWeGo 生态统一 | 团队以 Python/算法为主 |
| 编排运行时 | 自研开源 Eino（Go 版 LangGraph） | 直接用 LangChain | 类型安全、Go 性能、与内部栈一致、可控可商业化 | 生态优先于性能 |
| Agent 范式 | ReAct 工具循环为主 | 纯计划-执行/纯状态机 | 工具生态成熟、实现稳、LLM 原生 Function Calling | 需要强确定性流程时交给 Workflow |
| 多 Agent 路由 | 语义路由 + 规则兜底 + 粘性 | 纯 LLM 自由对话 / 纯硬编码 | 平衡灵活与可控、可解释、易调试 | 路由准确率不足时加规划器 |
| 子 Agent 复用 | 引用"已发布 Bot"为节点 | 全部内联复制 | 独立版本化、独立权限、可组合嵌套 | 超轻量任务用内联节点降成本 |
| 前后端契约 | Thrift IDL 双端生成 | 手写 REST 类型 | 大规模多包前端下契约强一致、代码生成 | 小团队/开放生态优先 REST/OpenAPI |
| 向量库 | Milvus/OceanBase 可插拔 | 绑定单一向量库 | 私有化与企业落地要适配不同基建 | 单一标准化云环境 |
| 代码执行 | 独立 Python 沙箱 | 主进程内执行 | 安全隔离、依赖独立（PDF/DOCX 解析重） | 纯逻辑无外部依赖 |
| 协作模型 | 项目空间 + @ 派单 + 异构 Harness | 只做同质云端 Agent | 要接入 Claude Code/Codex 等真实工具链并支持本地资源 | 只做纯云端问答 |

---

## 12. 对自建"运维本体 + 多 Agent 平台"的借鉴启示

结合本项目的 K8s/Linux 智能运维本体背景，扣子架构里最值得直接借鉴的 7 点：

1. **"工具/技能/工作流/知识检索"统一抽象为 Tool**：把"本体查询（SPARQL/图查询）、根因分析、告警关联、预案执行、kubectl 诊断"都做成同构工具，ReAct Agent 即可透明调度，新增能力不改编排内核。
2. **单 Agent 自主规划优先，多 Agent 按复杂度拆**：运维场景中"分诊（路由）+ 各域专家 Agent（网络/存储/计算/变更）"天然适配扣子的开始节点 + 适用场景路由 + 全局跳转（如"P0/投诉"强制升级）。
3. **确定性流程交给 Workflow，不确定判断交给 Agent**：故障处置 SOP、变更流程用 DAG 工作流保证可审计；根因定位这种探索式任务交给 ReAct + 知识图谱检索。
4. **本体/知识图谱接入走 RAG 同款管道**：把本体类/关系/实例做向量化 + 图查询混合检索，作为 Agent 的 grounding 工具（呼应你们"LLM 无图谱接地 RCA 准确率极低"的结论），ES 关键词 + 向量 + 图遍历三路融合。
5. **防腐层（crossdomain）先画好边界**：agent / workflow / knowledge(本体) / 执行沙箱 之间只依赖契约，便于把"诊断 Agent"和"处置 Agent"独立迭代、独立授权。
6. **Checkpoint + 异步 execute_id + 回告**：运维长任务（抓日志、跑诊断脚本、灰度变更）必须异步可续跑、可人工确认（HITL），这与扣子工作流执行模型一致。
7. **执行面隔离与权限作用域**：处置类动作（可逆/不可逆分级）放沙箱/跳板，参考扣子"授权文件夹/云设备 + 凭证托管"，把高危动作做成需确认的工具。

**一个可落地的最小架构（综合借鉴）：**
```
接入(IM/Webhook告警) → 分诊Agent(ReAct+语义路由+P0全局跳转)
   ├─ 诊断专家Agent ── 工具：本体图查询/日志/指标/拓扑爆炸半径
   ├─ 变更专家Agent ── 确定性 Workflow(SOP, 可审计, HITL确认)
   └─ 处置执行Agent ── 沙箱/跳板执行 + 权限分级 + Checkpoint回滚
共享：运维本体知识库(向量+图) · 记忆(故障画像/历史处置) · 事件总线 · Trace
```

---

## 13. 不确定项 / 黑盒 / 待验证

| 优先级 | 未证实问题 | 影响 | 建议验证方式 |
|---|---|---|---|
| P1 | 多 Agent 语义路由是否为独立一次 LLM 调用、用何提示/是否结构化输出 | 影响 token 成本与路由准确率 | 抓 Trace / 实测各节点 token |
| P1 | 多 Agent 图与 Workflow 是否在运行时统一编译为 Eino compose 图 | 架构统一性判断 | 阅读 agentflow/workflow compose 源码 |
| P1 | 项目级 AI 团队的 @ 派单协议、共享上下文如何裁剪注入 | 自建协作平台的关键 | 闭源，只能从开放 API/行为推测 |
| P2 | 云设备/本地 Agent 的长连接与命令下发协议 | Computer-Use 落地 | 官方开放文档/桌面端抓包（合规前提下） |
| P2 | 混合检索的融合算法（RRF/加权）与重排策略 | RAG/本体检索效果 | 开源 knowledge 域源码 |
| P2 | 长期记忆的写入触发、压缩与召回机制 | 记忆设计参考 | memory 域源码 + 产品行为观测 |
| P3 | SaaS 版领域是否已从模块化单体拆成微服务 | 超大规模架构参考 | 无公开信息，保持黑盒 |

---

## 14. 证据来源

**开源代码与结构化解析**
- Coze Studio 仓库：https://github.com/coze-dev/coze-studio
- DeepWiki – Backend System：https://deepwiki.com/coze-dev/coze-studio/5-backend-system
- DeepWiki – Architecture：https://deepwiki.com/coze-dev/coze-studio/2-architecture
- 掘金《Coze Studio 源码分析（一）后端架构及数据流分析》：https://juejin.cn/post/7573468493570506788
- 阿里云开发者社区《从 DDD 到 Workflow Runtime：拆解 Coze Studio 的全栈技术架构》：https://developer.aliyun.com/article/1708209
- CSDN《Coze Studio 开源版：AI Agent 开发平台的深度技术解析》：https://blog.csdn.net/pbymw8iwm/article/details/150853380

**官方产品文档**
- 多 Agent 模式：https://docs.coze.cn/guides_multiagent
- 开放平台多智能体（节点与跳转）：https://docs.coze.cn/api/open/docs/guides/multiagent
- 打造你的 AI 团队：https://docs.coze.cn/cozespace_coze_ai_team_quickstart.md
- Agent 概述与类型（扣子/三方精选/本地）：https://docs.coze.cn/cozespace_agent_overview.md
- 扣子文档索引（llms.txt）：https://www.coze.cn/llms.txt?source=space

**多 Agent 机制实践（二手，已与官方文档交叉验证）**
- 《Coze 3.0 多智能体（Multi-Agent）全指南》：https://opc.csdn.net/6a5f76d810ee7a33f2910f6e.html
- 《Coze 平台多智能体协作实战：从架构设计到工程化落地》：https://wenku.csdn.net/column/3t4u7iu49ci

> 说明：标注 🟡/🔴 的部分为依据产品行为与开源底座的反推，不代表扣子官方实现；如需作为工程决策的确定依据，请以官方最新源码与文档为准。
