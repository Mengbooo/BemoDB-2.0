---
title: '路线图'
publishDate: '2026-05-08 08:00:00'
description: 'RoadMap'
tags:
  - Agent
language: 'zh-CN'
draft: true
---

# AI Engineer Roadmap：从前端工程到 AI 应用 / Agent 工程

> 版本：2026-05-08  
> 适用对象：有前端基础，想补后端、RAG、Agent、AI 应用工程，并希望能做出可写进简历项目的本科 / 实习阶段开发者。  
> 参考来源：roadmap.sh AI Engineer、牛客 AI 应用工程路线文章、牛客平台与中间件补充文章。

---

## 0. 先明确目标：AI Engineer 到底是什么？

roadmap.sh 对 AI Engineer 的定位是：

> AI Engineer 主要使用预训练模型和现有 AI 工具，去改进用户体验、构建实际应用；它不同于 AI Researcher 或 ML Engineer，后两者更偏模型理论、模型训练和算法研究。

所以这条路线不是让你一上来就学：

- 从零训练大模型
- CUDA 算子
- 推理框架内核
- 强化学习论文复现
- 大规模分布式训练

而是让你优先掌握：

- 怎么把模型能力接入真实产品
- 怎么做 RAG
- 怎么做 Agent
- 怎么做工具调用
- 怎么做评测和可观测
- 怎么让 AI 应用稳定、可维护、可上线

一句话：

> AI Engineer = 软件工程能力 + LLM 应用能力 + 数据 / 检索能力 + Agent 工程能力 + 部署与评测能力。

---

## 1. 总路线图

```text
AI Engineer Roadmap
├── Phase 1：工程底座
│   ├── 编程语言
│   ├── Git / Linux / Shell
│   ├── HTTP / API
│   ├── 数据库
│   ├── Redis / 消息队列 / 搜索引擎
│   ├── Docker
│   └── 基础系统设计
│
├── Phase 2：AI 基础认知
│   ├── LLM 基本概念
│   ├── Token / Context Window
│   ├── Prompt Engineering
│   ├── Embedding
│   ├── Function Calling / Tool Calling
│   ├── Streaming
│   └── 模型 API 调用
│
├── Phase 3：RAG 应用工程
│   ├── 文档解析
│   ├── Chunking
│   ├── Embedding
│   ├── 向量数据库
│   ├── BM25
│   ├── Hybrid Search
│   ├── Rerank
│   ├── 引用溯源
│   └── RAG 评测
│
├── Phase 4：Agent 工程
│   ├── Agent Loop
│   ├── ReAct
│   ├── Tool Calling
│   ├── Memory
│   ├── Planning
│   ├── Reflection
│   ├── Workflow
│   ├── LangGraph
│   ├── MCP
│   └── Human-in-the-loop
│
├── Phase 5：AI 应用产品化
│   ├── 前端交互
│   ├── 流式输出
│   ├── 工具调用过程展示
│   ├── 权限系统
│   ├── 多用户 / 多租户
│   ├── 成本控制
│   └── 安全边界
│
├── Phase 6：Eval / Observability
│   ├── Langfuse
│   ├── Trace
│   ├── Prompt 版本管理
│   ├── 测试集
│   ├── Bad Case 收集
│   ├── 自动化评测
│   └── Benchmark
│
├── Phase 7：平台与中间件
│   ├── MaaS
│   ├── AI Gateway
│   ├── Higress
│   ├── Agent Runtime
│   ├── K8s
│   ├── Ray
│   └── Kubeflow
│
└── Phase 8：进阶方向
    ├── 模型微调
    ├── 多模态
    ├── AI Infra
    ├── Agentic RL
    ├── 推理优化
    └── AI Native Software Engineering
```

---

## 2. Phase 1：工程底座

### 2.1 语言选择

你可以采用双语言路线：

```text
Go：补后端工程能力
TypeScript / Python：做 AI 应用、RAG、Agent 实验
```

推荐组合：

| 方向 | 推荐语言 | 原因 |
|---|---|---|
| 后端服务 | Go | 简洁、高性能、适合补工程底座 |
| AI 原型 | Python | AI 生态最强，RAG / Agent 框架多 |
| 前端 AI 应用 | TypeScript | 你已有前端基础，适合做完整产品 |
| 全栈 AI 应用 | TypeScript + Go / Python | 前端展示 + 后端模型调用 |

### 2.2 后端基础

必须掌握：

- HTTP 协议
- REST API
- WebSocket / SSE
- 文件上传
- 鉴权：Session / JWT / OAuth
- 数据库：PostgreSQL / MySQL
- ORM：GORM / Prisma / SQLAlchemy
- Redis
- 消息队列基础
- 日志
- 错误处理
- 配置管理
- Docker

学习目标：

> 能独立写一个后端服务，支持用户上传文件、调用模型、存储记录、返回流式结果。

### 2.3 数据库和中间件

最低要求：

- SQL 基础
- 索引
- 事务
- 分页
- Redis 缓存
- Elasticsearch / OpenSearch 基础
- 向量数据库基础

对 AI 应用来说，数据库不只是存用户表，还要存：

- 文档元数据
- Chunk
- Embedding
- 会话记录
- Agent 运行状态
- Tool Call 记录
- Prompt 版本
- 评测结果

---

## 3. Phase 2：AI 基础认知

### 3.1 LLM 基本概念

需要理解：

- Token
- Context Window
- Temperature
- Top-p
- System Prompt
- User Prompt
- Assistant Message
- Function Calling
- Tool Calling
- Structured Output
- Streaming
- Hallucination
- Rate Limit
- Token Cost

不要只会“调接口”，要知道每个参数会影响什么。

### 3.2 Prompt Engineering

要掌握：

- 角色设定
- 任务说明
- 输出格式约束
- Few-shot 示例
- Chain-of-Thought 的使用边界
- JSON 输出约束
- 自检提示
- 多轮上下文压缩
- Prompt 版本管理

核心原则：

> Prompt 不是玄学文案，而是模型接口设计的一部分。

### 3.3 模型 API 调用

至少要会：

- OpenAI API / 兼容 API
- 智谱 / DeepSeek / 通义 / 火山等国内模型 API
- 流式输出
- 多轮对话
- 工具调用
- JSON Schema 输出
- 错误重试
- 超时控制
- 费用统计

练习项目：

```text
做一个最小 AI Chat API：
- 前端输入问题
- 后端转发给模型
- 支持流式输出
- 支持历史上下文
- 支持错误提示
```

---

## 4. Phase 3：RAG 应用工程

RAG 是 AI Engineer 的核心能力之一。

### 4.1 RAG 是什么？

RAG = Retrieval-Augmented Generation，检索增强生成。

它解决的问题是：

```text
模型不知道你的私有数据
模型容易幻觉
模型知识可能过期
回答需要引用来源
```

基本流程：

```text
文档上传
↓
文档解析
↓
文本清洗
↓
切分 Chunk
↓
生成 Embedding
↓
存入向量数据库
↓
用户提问
↓
检索相关 Chunk
↓
重排
↓
拼接上下文
↓
模型回答
↓
返回引用来源
```

### 4.2 文档解析

需要掌握：

- PDF 解析
- Markdown 解析
- HTML 解析
- 表格解析
- 图片 OCR，可选
- 文档结构识别
- 标题层级识别

注意：

> 文档解析质量会直接决定 RAG 质量。

### 4.3 Chunking

需要理解：

- 固定长度切分
- 按标题切分
- 递归字符切分
- 语义切分
- Parent-child chunk
- Chunk overlap
- Chunk metadata

Chunk 不是越小越好，也不是越大越好。

### 4.4 Embedding 和向量数据库

需要掌握：

- Embedding 是什么
- 相似度计算
- Cosine Similarity
- 向量维度
- 向量索引
- HNSW
- Milvus / Qdrant / Weaviate / pgvector

初学推荐：

```text
本地 Demo：Chroma / Qdrant
生产倾向：pgvector / Milvus / Elasticsearch Vector
```

### 4.5 Hybrid Search

只做向量检索不够，推荐学习：

- BM25
- 向量检索
- Metadata Filter
- Query Rewrite
- Multi-query Retrieval
- Hybrid Search
- Rerank

比较完整的 RAG 检索链路：

```text
用户问题
↓
Query Rewrite
↓
BM25 召回
↓
Vector 召回
↓
Metadata Filter
↓
合并候选结果
↓
Rerank
↓
选择 Top K
↓
生成答案
```

### 4.6 RAG 项目要求

你应该做一个可展示项目：

```text
AI 个人知识库 / 文档问答系统
```

最低功能：

- 上传 PDF / Markdown
- 自动解析文档
- 分块入库
- 向量检索
- 问答
- 引用来源
- 历史会话

进阶功能：

- BM25 + Vector 混合检索
- Rerank
- Query Rewrite
- 多文档对比
- 权限控制
- Langfuse Trace
- 评测集
- Bad Case 管理

---

## 5. Phase 4：Agent 工程

这一部分是这份路线里最重要的扩展。结合我们前面讨论的几篇资料，可以先记住一个判断：

> Agent 工程不是“换一个更炫的聊天框”，而是让模型具备可控地调用工具、管理状态、执行任务、处理中断、接受评测的工程系统。

不要一上来就陷入框架名词：LangChain、LangGraph、CrewAI、AutoGen、Agno、Dify、Coze、OpenClaw、Hermes、Claude Code、Codex……它们背后的核心问题其实是同一组：

```text
状态怎么保存？
任务怎么拆解？
工具怎么注册和调用？
错误怎么恢复？
权限怎么限制？
用户什么时候介入？
结果怎么评测？
过程怎么展示？
长期运行怎么管理？
```

### 5.1 Agent 的本质

一个 Agent 可以理解为：

```text
LLM + Tools + Memory + Planning + Loop + State + Guardrails + Eval
```

也可以更工程化地理解为：

```text
模型负责判断
工具负责行动
状态负责流程控制
记忆负责上下文
策略负责调度
围栏负责限制风险
评测负责证明效果
可观测负责定位问题
```

你前面提到过“Agent Loop 到围栏”，这个说法很好。Agent 的核心不是“模型很聪明”，而是：

```text
让不稳定的模型，在稳定的工程边界里，尽可能可靠地完成任务。
```

### 5.2 Agent 和 Workflow 的区别

很多人会把 Workflow 和 Agent 混在一起。可以这样区分：

| 类型 | 特点 | 适合场景 |
|---|---|---|
| Workflow | 流程固定，节点明确，路径可控 | 审批流、报告生成、客服流程、内容生产 |
| Agent | 由模型动态决定下一步 | 研究、排障、代码修改、开放式任务 |
| Hybrid | 主流程固定，局部交给 Agent | 真实生产应用最常见 |

你现阶段最推荐走 **Hybrid Agent**：

```text
外层用 Workflow 保证稳定
内层用 Agent 处理不确定任务
关键节点加入 Human-in-the-loop
```

比如 Research Agent：

```text
输入主题
↓
Workflow 固定步骤：拆题 → 检索 → 大纲 → 写作 → 导出
↓
每一步内部允许 Agent 自主选择工具
↓
大纲和最终报告前加入人工确认
```

这样比“完全自主 Agent”更容易上线，也更适合写进简历。

### 5.3 最小 Agent Loop

你应该手写一次最小 Agent Loop，而不是直接上框架。

最小循环：

```text
输入任务
↓
构造 System Prompt + 工具说明 + 历史状态
↓
调用模型
↓
模型决定：回答 / 调工具 / 继续思考
↓
如果调工具：校验参数 → 执行工具 → 返回 Observation
↓
更新状态
↓
继续循环
↓
达到完成条件 / 最大步数 / 错误中止
```

伪代码：

```ts
while (!done && step < maxSteps) {
  const response = await model.call({ messages, tools })

  if (response.type === 'final') {
    return response.answer
  }

  if (response.type === 'tool_call') {
    const safeArgs = validate(response.args)
    const result = await runTool(response.toolName, safeArgs)
    messages.push({ role: 'tool', content: result })
  }

  step++
}
```

最小版本要实现这些边界：

```text
最大循环步数
工具白名单
参数校验
工具超时
错误重试
中间状态日志
最终失败兜底
```

这一步比直接学 LangGraph 更重要，因为它会让你理解所有 Agent 框架到底在封装什么。

### 5.4 ReAct：最基础的 Agent 思维模式

ReAct = Reasoning + Acting。

经典结构：

```text
Thought
Action
Observation
Thought
Action
Observation
Final Answer
```

但在真实项目里，不一定要把 Thought 暴露给用户，更常见的是展示成：

```text
正在分析任务
正在调用搜索工具
已读取 3 个资料来源
正在整理结论
生成最终回答
```

学习重点：

```text
什么时候应该调用工具
什么时候应该直接回答
工具结果如何反馈给模型
如何避免无限循环
如何处理工具失败
如何在前端展示过程
```

你做项目时，不要只做“最终答案”，要把 Agent 过程展示出来，这能体现你的前端优势。

### 5.5 Tool Calling：Agent 的手脚

Tool Calling 是 Agent 工程的核心。

你要掌握：

```text
Function Schema
参数校验
权限控制
工具超时
工具错误处理
工具结果格式化
工具调用日志
工具调用可视化
危险工具人工确认
```

典型工具分层：

| 工具类型 | 示例 | 风险等级 |
|---|---|---|
| 只读工具 | 搜索、读取文件、查询知识库、读取网页 | 低 |
| 计算工具 | 计算器、代码解释器、数据分析 | 中 |
| 写入工具 | 写文件、改数据库、创建日程、发邮件 | 高 |
| 执行工具 | Shell、运行脚本、调用外部 API | 很高 |

建议你的项目里先做这些工具：

```text
search_web：搜索资料
read_file：读取本地文档
query_kb：查询知识库
calculator：计算
write_markdown：生成 Markdown 文件
```

后面再加高风险工具：

```text
shell_exec：执行命令，需要沙箱和人工确认
git_diff：查看代码变更
apply_patch：修改文件，需要确认
send_email：发送邮件，需要确认
```

### 5.6 Tools as API：把工具当后端接口设计

不要把 Tool 只当 Prompt 里的几行描述。每个 Tool 都应该像一个正式 API：

```text
工具名清晰
描述准确
参数 Schema 严格
返回结构稳定
错误码明确
权限边界明确
可测试
可观测
```

推荐工具返回格式：

```json
{
  "ok": true,
  "data": {},
  "summary": "给模型看的简短结果",
  "metadata": {
    "latencyMs": 123,
    "source": "local_kb"
  }
}
```

这样做的好处是：

```text
模型更容易理解结果
前端更容易展示过程
后端更容易记录日志
后期更容易做评测
```

### 5.7 Memory：不要一开始做太复杂

Memory 可以分为：

| 类型 | 作用 |
|---|---|
| Short-term Memory | 当前会话上下文 |
| Long-term Memory | 长期用户偏好、知识 |
| Episodic Memory | 任务经历和历史轨迹 |
| Semantic Memory | 结构化知识 |
| Vector Memory | 向量化记忆检索 |

初学阶段不要上来就做“超级记忆系统”。先实现：

```text
会话历史
任务状态
摘要压缩
向量检索记忆
用户确认后再写入长期记忆
```

关键原则：

```text
不是所有内容都应该记住
长期记忆最好需要用户确认
记忆要可查看、可删除、可追溯
```

在你的 AI Knowledge Agent 里，可以这样设计：

```text
Session Memory：当前对话
Project Memory：某个项目下的文档和历史结论
User Memory：用户偏好，例如输出格式、技术栈偏好
Task Memory：某次 Agent 执行过程中的状态
```

### 5.8 Planning：任务拆解不要迷信模型

Planning 是让 Agent 把大任务拆成小任务。

常见方式：

```text
一次性生成计划
边执行边修正计划
先生成 Todo，再逐项执行
用 Workflow 固定大步骤
用模型只决定局部步骤
```

推荐你采用这种模式：

```text
Plan → User Review → Execute → Reflect → Final
```

也就是：

```text
先让 Agent 给计划
用户确认或修改
再开始执行
执行中记录每一步
结束后给总结和可复用产物
```

这其实就是你之前提到的“让 Agent 先提出 plan，再执行”的工作流。它很接近 Spec-Driven Development / Plan Mode 的思想。

在 Coding Agent 里，这个模式尤其重要：

```text
读需求
↓
读相关文件
↓
提出修改计划
↓
用户确认
↓
执行 patch
↓
跑测试
↓
总结变更
```

### 5.9 Reflection：自检不是万能药

Reflection 是让 Agent 检查自己的输出或执行过程。

适合用在：

```text
检查答案是否遗漏
检查工具调用是否失败
检查引用是否支持结论
检查代码修改是否符合需求
检查报告结构是否完整
```

但不要滥用 Reflection。因为它会增加：

```text
Token 成本
延迟
不确定性
```

更工程化的做法是：

```text
规则检查优先
测试用例优先
结构化评测优先
模型反思作为补充
```

例如 RAG 项目里，先用程序检查：

```text
是否有引用
引用是否来自检索结果
是否超过最大长度
是否输出了规定格式
```

再让模型做语义层面的检查。

### 5.10 Guardrails：围栏是 Agent 上线的前提

Agent 最大的问题不是“不会做事”，而是“做错事还很自信”。

所以必须设计 Guardrails：

```text
工具白名单
权限校验
参数校验
最大步数
最大 Token
最大费用
超时控制
敏感操作人工确认
Prompt Injection 检测
输出格式校验
日志审计
```

按风险分级：

| 操作 | 是否需要确认 |
|---|---|
| 搜索资料 | 不需要 |
| 读取用户上传文档 | 不需要，但要有权限 |
| 写入草稿 | 可自动 |
| 修改源代码 | 建议确认 |
| 执行 Shell | 必须确认 / 沙箱 |
| 删除文件 | 必须确认 |
| 发邮件 / 下单 / 转账 | 必须确认，且默认不自动执行 |

你如果做 AI Coding Assistant Lite，一定要把 Guardrails 写进 README，这是项目亮点。

### 5.11 State：Agent 工程最容易被忽略的核心

很多 Agent Demo 失败，不是因为模型不行，而是因为状态管理混乱。

你需要明确保存：

```text
用户原始任务
当前计划
已完成步骤
当前步骤
工具调用历史
中间产物
错误信息
用户确认记录
最终输出
```

推荐 State 结构：

```json
{
  "taskId": "task_001",
  "goal": "生成一篇调研报告",
  "plan": [],
  "currentStep": 2,
  "messages": [],
  "toolCalls": [],
  "artifacts": [],
  "approvals": [],
  "status": "running"
}
```

这部分对应 LangGraph 里的 State，也是你理解 LangGraph 的关键。

### 5.12 Human-in-the-loop：真实项目必须有人工介入

Human-in-the-loop 不是低级，而是可靠性的体现。

适合加入人工确认的节点：

```text
任务计划确认
搜索范围确认
报告大纲确认
危险工具调用确认
代码 Patch 确认
最终发布确认
```

前端交互可以设计成：

```text
Agent 生成计划卡片
用户点击：确认 / 修改 / 重新生成
Agent 继续执行
遇到危险操作弹出确认
完成后展示产物和执行日志
```

这和你前端背景非常契合。很多人会做 Agent 后端，但不会把 Agent 过程产品化展示出来，这是你的差异化空间。

### 5.13 Workflow / LangGraph：用图管理复杂 Agent

Workflow 是 Agent 工程中更可控的一种形态。

适合场景：

```text
流程固定
步骤清晰
需要人工审核
需要稳定上线
```

典型框架：

```text
Dify
Coze
n8n
LangGraph
```

建议重点学 LangGraph，因为它适合理解 Agent 的状态和图编排。

你需要掌握：

```text
State
Node
Edge
Conditional Edge
Checkpoint
Subgraph
Human-in-the-loop
Tool Node
Multi-Agent Graph
```

练习项目：

```text
Research Agent：
- 输入主题
- 自动拆解问题
- 搜索资料
- 汇总要点
- 生成报告
- 人工确认后导出 Markdown
```

### 5.14 MCP：把工具标准化

MCP 可以理解为 Agent 调用外部工具的协议层。

你需要理解：

```text
MCP Server
MCP Client
Tools
Resources
Prompts
如何把本地能力暴露给 Agent
```

MCP 的价值在于：

```text
工具不再和某个 Agent 框架强绑定
本地文件、数据库、浏览器、Git、项目文档都可以作为能力暴露出去
不同客户端可以复用同一套工具
```

练习项目：

```text
本地文件系统 MCP Server：
- list_files：列出文件
- read_file：读取文件
- search_files：搜索文件
- write_markdown：写入 Markdown
```

进阶项目：

```text
项目知识库 MCP Server：
- search_docs：搜索项目文档
- read_spec：读取需求规格
- list_tasks：列出任务
- create_task：创建任务草稿
```

这和你之前关注的 AGENT.md、spec 文件、spec-kit、Agent 辅助编码非常契合。

### 5.15 Multi-Agent：先理解，不要过早沉迷

多 Agent 不是多个聊天机器人互相说话，而是多个角色围绕同一个任务协作。

常见模式：

```text
Router Agent：负责分发任务
Research Agent：负责搜索和资料整理
Writer Agent：负责写作
Reviewer Agent：负责审查
Tool Agent：负责执行具体工具
```

但初学不要急着做复杂多 Agent。很多时候：

```text
单 Agent + 多工具 + 明确 Workflow
```

比多 Agent 更稳定、更容易上线。

建议学习顺序：

```text
Single Agent
↓
Single Agent + Tools
↓
Workflow Agent
↓
Agent as Tool
↓
Multi-Agent Graph
```

### 5.16 Agent Runtime / Agent OS：后期再看

你之前提到过 OpenClaw、Hermes、AgentOS、24/7 Agent。这些属于 Agent Runtime / Agent OS 方向。

它关注的是：

```text
Agent 在哪里运行
Agent 如何长期运行
任务如何排队
工具调用如何隔离
代码执行如何沙箱化
权限如何管理
失败如何恢复
如何定时执行
如何多 Agent 调度
```

这部分很有前景，但不建议作为入门主线。正确顺序是：

```text
先做单次任务 Agent
再做可恢复 Workflow Agent
再做带队列和定时任务的长期运行 Agent
最后再研究 Agent Runtime / Agent OS
```

### 5.17 Coding Agent：和你最相关的 Agent 方向之一

你经常提到 Codex、Claude Code、Plan 模式、Spec Coding，这说明 Coding Agent 很适合作为你的长期方向。

一个 Coding Agent 的核心能力：

```text
读取项目结构
理解需求
搜索相关文件
提出修改计划
生成 Patch
运行测试
分析报错
迭代修复
总结变更
```

最小项目可以做：

```text
AI Coding Assistant Lite
```

MVP 功能：

```text
读取指定目录
根据需求搜索相关文件
生成修改计划
生成 diff，不直接覆盖文件
用户确认后应用 patch
运行测试命令
输出总结
```

关键边界：

```text
默认只读
写入必须确认
Shell 必须确认
所有 patch 可回滚
记录完整执行日志
```

这类项目简历价值很高，因为它同时覆盖：

```text
Agent Loop
Tool Calling
文件系统工具
Git Diff
Human-in-the-loop
Guardrails
Eval
前端过程展示
```

### 5.18 Agent 前端：你的差异化优势

很多 Agent 教程只讲后端，但真实产品里前端非常重要。

Agent 前端不是普通 Chat UI，而是任务执行控制台：

```text
任务目标区
计划确认区
执行时间线
工具调用卡片
中间产物预览
人工确认弹窗
错误重试按钮
最终产物导出
Trace / 日志入口
```

推荐你做的 UI 组件：

```text
AgentTimeline：展示执行步骤
ToolCallCard：展示工具名、参数、结果、耗时
ApprovalCard：展示待确认操作
ArtifactPanel：展示生成的 Markdown / 代码 diff / 报告
StateInspector：开发模式下查看 Agent State
CostBadge：显示 Token 和费用
```

这正好结合你的前端能力，也能和你喜欢的 Vercel / Linear 风格设计结合起来。

### 5.19 Agent 评测：别只证明“能跑”

Agent 项目最容易被质疑：

```text
看起来能跑，但到底稳定吗？
```

所以你要做最小评测集。

Agent Eval 可以评估：

```text
是否选择正确工具
工具参数是否正确
是否完成任务
是否陷入循环
是否越权操作
总步数是否合理
最终结果是否符合格式
```

建议建立一个 `eval_cases.json`：

```json
[
  {
    "id": "case_001",
    "task": "读取 README 并总结项目启动方式",
    "expectedTools": ["read_file"],
    "forbiddenTools": ["shell_exec", "delete_file"],
    "mustMention": ["pnpm install", "pnpm dev"]
  }
]
```

最小评测脚本要输出：

```text
任务成功率
平均步数
工具调用正确率
越权调用次数
平均耗时
平均 Token 成本
```

如果你能把 Langfuse Trace + eval_cases.json + Bad Case 表结合起来，这个项目就很有工程味。

### 5.20 Agent 学习资料怎么安排

建议顺序：

```text
1. 先看 Datawhale Hello Agents，建立概念
2. 看 Agentic Design Patterns，理解常见模式
3. 手写最小 Agent Loop
4. 学 Tool Calling 和结构化输出
5. 学 LangGraph，用 State Graph 做 Workflow Agent
6. 学 MCP，做一个本地工具 Server
7. 接入 Langfuse，做 Trace 和 Eval
8. 最后再看 Agno / CrewAI / AutoGen / Agent Runtime
```

你前面提到的路线可以调整成：

```text
Datawhale Hello Agents
↓
Agentic Design Patterns
↓
手写 Agent Loop
↓
LangGraph
↓
MCP
↓
做 Research Agent / AI Coding Assistant Lite
↓
Langfuse + Eval
↓
Agno / Agent Runtime / OpenClaw / Hermes
```

### 5.21 Agent 工程阶段产出物

这一阶段结束时，你至少应该有一个可展示项目：

```text
Research Agent 或 AI Coding Assistant Lite
```

推荐项目结构：

```text
agent-project/
├── apps/
│   ├── web/                 # 前端控制台
│   └── api/                 # 后端服务
├── packages/
│   ├── agent-core/          # Agent Loop / State / Tool Registry
│   ├── tools/               # 工具实现
│   ├── evals/               # 评测用例和脚本
│   └── mcp-server/          # MCP 工具服务
├── docs/
│   ├── architecture.md
│   ├── agent-design.md
│   ├── tool-spec.md
│   ├── guardrails.md
│   └── eval-report.md
└── README.md
```

最小 README 亮点：

```text
Agent 架构图
Agent Loop 说明
Tool Calling 设计
Guardrails 设计
Human-in-the-loop 流程
Langfuse Trace 截图
Eval 结果表
Demo 视频
```


### 5.22 2025-2026 新版 Agent 工程生态：Harness、Agent SDK、ADK、Skills、AI DevOps

这一节是对前面 Agent 工程路线的补充。2025-2026 年之后，Agent 生态明显从“写一个能调工具的 Demo”转向了：

```text
Agent Framework
↓
Agent Runtime
↓
Agent Harness
↓
Agent DevOps
↓
AI Native Software Delivery
```

也就是说，新的重点不只是“Agent 会不会调用工具”，而是：

```text
它能不能长期运行？
能不能被观测？
能不能安全地执行任务？
能不能接入 CI/CD？
能不能被评测和回滚？
能不能成为软件交付链路的一部分？
```

你提到的 **Harness**，正好属于这个趋势。

---

#### 5.22.1 先区分两个 Harness

这里有两个容易混淆的概念：

| 名称 | 含义 | 应该怎么理解 |
|---|---|---|
| Harness.io | 一个 AI Native Software Delivery / DevOps 平台 | 偏企业级软件交付、CI/CD、测试、安全、FinOps、Incident、DevOps Agent |
| agent harness | 泛指 Agent 的运行支架 / 执行框架 / 长任务控制系统 | 偏通用 Agent 工程概念，用来让 Agent 长时间、可控、可恢复地执行任务 |

所以你说“Agent 工程里 Harness 之类”，可以理解为两个方向：

```text
方向 A：Harness.io 这种 AI DevOps 平台
方向 B：long-running agent harness 这种 Agent 运行支架思想
```

两个都值得了解，但你现在更应该先理解 **B：agent harness 思想**，再了解 Harness.io 这种企业级平台。

---

#### 5.22.2 Agent Harness：长期运行 Agent 的工程支架

传统 Agent Loop 只解决：

```text
模型 → 选工具 → 执行工具 → 返回结果 → 继续
```

但真实任务往往更复杂，比如：

```text
修复一个复杂 Bug
整理一个大型项目文档
持续监控线上错误
每天自动生成报告
根据 CI 失败自动定位原因
持续跑测试并修复问题
```

这类任务有几个特点：

```text
执行时间长
中间状态多
工具调用多
容易失败
需要恢复
需要人工介入
需要成本控制
需要日志和 Trace
```

所以需要一个 Agent Harness。它的职责不是“让模型更聪明”，而是给 Agent 一个可靠的工程外壳。

可以理解为：

```text
Agent Harness = Agent Loop + State Store + Tool Sandbox + Checkpoint + Queue + Approval + Trace + Eval + Recovery
```

它应该包含：

```text
任务队列
状态存储
检查点 Checkpoint
上下文压缩 Compaction
工具权限系统
代码执行沙箱
人工确认节点
失败重试
超时中止
成本限制
执行日志
可观测 Trace
结果评测
任务恢复
```

这和你之前关注的：

```text
24/7 Agent
Hermes
OpenClaw
AgentOS
Codex Plan 模式
Claude Code
Spec Coding
```

本质上是一条线。

---

#### 5.22.3 一个 Agent Harness 的最小架构

你可以这样设计自己的最小 Harness：

```text
User Task
↓
Task Manager
↓
Planner
↓
Approval Gate
↓
Executor Loop
↓
Tool Registry
↓
Sandbox / API / File System
↓
State Store + Checkpoint
↓
Trace + Eval
↓
Final Artifact
```

对应模块：

| 模块 | 作用 |
|---|---|
| Task Manager | 创建任务、取消任务、恢复任务、查看任务状态 |
| Planner | 把需求拆成步骤，生成可审查计划 |
| Approval Gate | 高风险动作前要求用户确认 |
| Executor Loop | 按计划执行、动态修正、调用工具 |
| Tool Registry | 管理工具 Schema、权限、调用日志 |
| Sandbox | 隔离 Shell、代码执行、文件写入 |
| State Store | 保存任务状态、步骤、消息、工具结果 |
| Checkpoint | 支持中断后恢复 |
| Trace | 记录每一步模型输入、输出、工具调用 |
| Eval | 判断任务是否完成、有没有越权、效果如何 |

你可以把它做成一个项目：

```text
Agent Harness Lite
```

目标不是和 Harness.io 竞争，而是证明你理解 Agent 工程化的本质。

---

#### 5.22.4 Harness.io：AI Native Software Delivery

Harness.io 的方向不是普通聊天 Agent，而是把 AI Agent 放进软件交付链路里。

它覆盖的场景大致包括：

```text
AI Code Agent
AI DevOps Agent
AI QA Agent
AI AppSec Agent
AI FinOps Agent
AI Infra Agent
Incident Agent
```

你可以这样理解：

```text
Cursor / Claude Code / Codex 更偏“写代码”
Harness 更偏“代码之后的交付链路”
```

也就是：

```text
写代码
↓
生成测试
↓
创建 CI/CD Pipeline
↓
部署
↓
安全扫描
↓
成本优化
↓
线上验证
↓
异常回滚
↓
事故调查
```

Harness 类平台真正有价值的地方在于：

```text
它不是单点 Agent，
而是把 Agent 嵌入已有的软件工程流程。
```

对你学习的启发：

```text
不要只做“AI 写代码”
还要理解“AI 如何进入软件交付流程”
```

这也是 AI Engineer 和普通前端 / 后端开发拉开差距的地方。

---

#### 5.22.5 AI DevOps Agent：Agent 进入 CI/CD

AI DevOps Agent 主要解决：

```text
自动生成 Pipeline
修改 Pipeline Step
解释 CI 失败原因
生成部署策略
自动补充策略规则
生成 OPA / Rego 合规策略
帮助排查部署失败
```

你不一定要真的使用 Harness 平台，但要学习它背后的模式：

```text
自然语言需求
↓
转换为工程配置
↓
生成 Pipeline / Policy / Test
↓
运行并收集结果
↓
解释失败
↓
提出修复建议
↓
必要时回滚或等待人工确认
```

你可以把这个模式迁移到自己的项目里。

比如做一个：

```text
AI CI Doctor
```

功能：

```text
读取 GitHub Actions 日志
总结失败原因
定位可能文件
给出修复计划
生成 patch
用户确认后应用
重新运行测试
```

这比单纯做一个聊天机器人更有工程价值。

---

#### 5.22.6 OpenAI Agents SDK：轻量生产化 Agent 模式

OpenAI Agents SDK 的重点不是“新框架名字”，而是它把生产 Agent 的几个核心概念显式化了：

```text
Agent
Tool
Handoff
Guardrail
Tracing
Human Review
State / Result
```

你应该重点学它的设计思想：

| 概念 | 价值 |
|---|---|
| Agent | 把模型、指令、工具封装成可复用单元 |
| Tool | 外部能力调用 |
| Handoff | 一个 Agent 把任务交给另一个 Agent |
| Guardrail | 输入 / 输出 / 工具调用的安全校验 |
| Tracing | 观察 Agent 每一步执行过程 |
| Human Review | 在关键节点让人介入 |

它适合学习：

```text
多 Agent 任务转交
轻量工具调用
生产可观测
Guardrails
```

如果 LangGraph 更像“图编排”，OpenAI Agents SDK 更像“简洁的 Agent 应用 SDK”。

---

#### 5.22.7 Google ADK / Agent Runtime：企业级 Agent 开发与部署

Google ADK 的重点是：

```text
开发 Agent
调试 Agent
评测 Agent
部署 Agent
管理 Agent Runtime
```

它的价值不只是写 Agent，而是把 Agent 放到企业级平台里运行。

你需要关注这些概念：

```text
Agent Development Kit
Agent Runtime
Agent Engine
Agent Gateway
Agent Registry
Agent Observability
Agent Evaluation
```

这些东西说明 Agent 正在从“应用代码”变成“平台资产”。

也就是说，未来公司可能会像管理微服务一样管理 Agent：

```text
注册
部署
鉴权
观测
评测
灰度
回滚
审计
```

这和你要学 Go 后端、云原生、AI Gateway、MaaS 是相通的。

---

#### 5.22.8 Vercel AI SDK：前端 / 全栈 Agent 产品化

Vercel AI SDK 对你特别重要，因为你有前端背景。

它适合解决：

```text
流式输出
多模型 Provider 接入
工具调用
类型安全 Chat
Agentic Loop Control
React / Next.js AI UI
```

你可以把它放在这条线上：

```text
后端 Agent Core
↓
Vercel AI SDK / SSE / WebSocket
↓
Agent Timeline UI
↓
Tool Call Card
↓
Artifact Panel
```

也就是说：

```text
LangGraph / Agent Core 负责思考和执行
Vercel AI SDK 负责把过程产品化展示出来
```

这非常适合你做一个高完成度作品。

---

#### 5.22.9 Agent Skills：从“工具调用”到“能力包”

Agent Skills 是一个很新的方向。它不是普通 Tool，而是一个能力包。

可以理解为：

```text
Tool = 一个函数
Skill = 一组说明 + 脚本 + 模板 + 资源 + 工作流知识
```

一个 Skill 通常包含：

```text
SKILL.md
脚本
模板
示例
参考资料
专用工具说明
```

它解决的问题是：

```text
不要把所有能力一次性塞进 Prompt
只有在需要时再加载相关能力
让 Agent 能复用组织内部流程知识
让复杂任务有稳定操作手册
```

这和你之前问的 AGENT.md、spec 文件、项目规则很相关。

你可以在项目里设计：

```text
skills/
├── write-tech-blog/
│   ├── SKILL.md
│   └── template.md
├── fix-frontend-bug/
│   ├── SKILL.md
│   └── checklist.md
├── generate-ui-spec/
│   ├── SKILL.md
│   └── ui-spec-template.md
└── analyze-ci-failure/
    ├── SKILL.md
    └── github-actions-guide.md
```

这会让你的 Agent 项目更像真实 Coding Agent，而不是玩具 Demo。

---

#### 5.22.10 MCP 的新风险：不要只学会接，还要学会防

MCP 很重要，但新生态里也开始暴露风险：

```text
工具权限过大
本地命令执行风险
恶意 MCP Server
Prompt Injection
工具描述注入
供应链污染
IDE 场景下的上下文污染
```

所以学习 MCP 时，要同时学习：

```text
工具白名单
Server 来源审查
只读优先
写操作确认
Shell 禁用或沙箱化
参数校验
命令白名单
日志审计
最小权限原则
```

你的项目 README 里如果能写清楚 MCP 安全边界，会比很多教程项目更专业。

---

#### 5.22.11 新版 Agent 工程技术地图

可以把新版 Agent 工程理解成 8 层：

```text
L1：Model Layer
- OpenAI / Claude / Gemini / DeepSeek / Qwen

L2：Tool Layer
- Function Calling
- Tool Registry
- MCP Server
- API Tools

L3：Skill Layer
- Agent Skills
- AGENT.md
- 项目规范
- 任务模板

L4：Agent Core Layer
- Agent Loop
- ReAct
- Planning
- Reflection
- Memory
- State

L5：Orchestration Layer
- LangGraph
- OpenAI Agents SDK
- Google ADK
- CrewAI
- AutoGen
- Agno

L6：Harness / Runtime Layer
- Task Queue
- Checkpoint
- Sandbox
- Long-running Agent
- Human Approval
- Recovery

L7：DevOps / Platform Layer
- Harness.io
- AI Gateway
- Agent Runtime
- Agent Registry
- Langfuse
- CI/CD
- Incident Agent

L8：Product Experience Layer
- Agent Timeline
- Tool Call Card
- Artifact Panel
- Diff Viewer
- Approval UI
- Trace Viewer
```

你当前最适合优先学：

```text
L2 Tool Layer
L3 Skill Layer
L4 Agent Core Layer
L5 Orchestration Layer
L8 Product Experience Layer
```

暂时了解即可：

```text
L6 Harness / Runtime Layer
L7 DevOps / Platform Layer
```

但可以做一个 Lite 版项目来体现理解。

---

#### 5.22.12 结合你情况的新版学习顺序

推荐你把 Agent 工程学习路线更新为：

```text
1. 手写 Agent Loop
2. Tool Calling + Tool Registry
3. State / Checkpoint / Trace
4. LangGraph Workflow Agent
5. MCP Server
6. Agent Skills / AGENT.md / Spec Coding
7. Vercel AI SDK 做 Agent 前端控制台
8. Langfuse 做 Trace 和 Eval
9. OpenAI Agents SDK / Google ADK 对比学习
10. Agent Harness Lite：长任务、队列、恢复、人工确认
11. AI CI Doctor：接入 GitHub Actions / 测试日志
12. 了解 Harness.io / AI DevOps / Agent Runtime
```

其中最适合你做成项目的是：

```text
项目 1：Research Agent
项目 2：AI Coding Assistant Lite
项目 3：Agent Harness Lite
项目 4：AI CI Doctor
```

---

#### 5.22.13 Agent Harness Lite 项目设计

如果你想做一个更“新”的项目，而不是普通 RAG，可以做：

```text
Agent Harness Lite：一个面向开发任务的长任务 Agent 执行台
```

核心功能：

```text
创建任务
生成计划
用户确认计划
读取项目文件
生成修改建议
生成 diff
用户确认 patch
运行测试
分析测试失败
自动二次修复
生成最终报告
保存 Trace
输出 Eval 指标
```

技术栈建议：

```text
前端：Next.js + Vercel AI SDK + Tailwind
后端：Go / Node.js / Python 均可
Agent：LangGraph 或 OpenAI Agents SDK
工具协议：MCP
观测：Langfuse
存储：PostgreSQL + Redis
沙箱：Docker
版本控制：Git Diff / Patch
```

亮点：

```text
不是聊天机器人
不是简单 RAG
而是 Agent 工程执行平台
```

README 可以这样写：

```text
本项目实现了一个最小 Agent Harness，支持长任务执行、工具调用、状态检查点、人工审批、代码 diff、测试反馈、Trace 观测和 Agent Eval，用于探索 AI Coding Agent 在真实软件工程流程中的落地方式。
```

这会比普通“接入大模型做聊天”的项目更有竞争力。

---

#### 5.22.14 AI CI Doctor 项目设计

这是更贴近 Harness / AI DevOps 的项目。

目标：

```text
让 Agent 读取 CI 日志，定位失败原因，并给出修复方案。
```

MVP：

```text
上传 GitHub Actions 日志
Agent 分析失败阶段
提取错误栈
定位相关文件
生成修复建议
生成 Markdown 报告
```

进阶：

```text
接 GitHub API
自动读取失败 Workflow
关联最近 commit diff
推测失败原因
生成 patch
用户确认后创建 PR
接入 Langfuse Trace
建立 CI Failure Eval Cases
```

这类项目对应 Harness 的 AI DevOps Agent 思路，但你可以做一个开源 Lite 版。

---

#### 5.22.15 当前 Agent 新生态的学习优先级

| 内容 | 优先级 | 原因 |
|---|---:|---|
| Tool Calling | P0 | Agent 基础能力 |
| State / Checkpoint | P0 | 长任务必须掌握 |
| Guardrails | P0 | 上线前提 |
| LangGraph | P0 | 理解状态图和 Workflow Agent |
| MCP | P0 | 工具生态标准化 |
| Vercel AI SDK | P0 | 适合你发挥前端优势 |
| Langfuse | P0 | Trace / Eval 必备 |
| Agent Skills | P1 | 新趋势，适合 Coding Agent |
| OpenAI Agents SDK | P1 | 轻量生产化 Agent 模式 |
| Google ADK | P1 | 企业级 Agent 开发部署方向 |
| Agent Harness | P1 | 长任务和 AgentOS 的关键 |
| Harness.io | P2 | 企业级 AI DevOps 平台，先理解思想 |
| Ray / Kubeflow | P2 | 平台和分布式方向，后期再看 |
| Agentic RL | P3 | 非当前主线 |

---

#### 5.22.16 你应该更新的认知

以前的 Agent 学习路线是：

```text
Prompt → Tool Calling → ReAct → RAG → Multi-Agent
```

现在更完整的路线应该是：

```text
Prompt
↓
Tool Calling
↓
Stateful Agent
↓
Workflow Agent
↓
MCP / Skills
↓
Guardrails / Eval / Trace
↓
Agent Harness
↓
Agent DevOps
↓
AI Native Software Delivery
```

一句话：

> 2026 年的 Agent 工程，不再只是“让模型会用工具”，而是“让 Agent 像一个可部署、可观测、可审计、可恢复的软件系统一样运行”。


---

## 6. Phase 5：AI 应用产品化

AI Engineer 不只是后端，也要懂产品交互。

尤其你有前端背景，应该把这个优势放大。

### 6.1 前端 AI 交互

需要掌握：

- Chat UI
- Streaming UI
- Markdown 渲染
- Code Block 渲染
- Tool Call 展示
- Loading 状态
- Step Timeline
- 引用来源展示
- 结果可复制 / 可导出
- 错误状态

### 6.2 Agent 过程可视化

Agent 产品不要只显示最终答案，最好显示：

- 当前执行到哪一步
- 调用了什么工具
- 工具返回了什么
- 是否需要用户确认
- 哪一步失败了
- 是否可以重试

典型 UI：

```text
任务输入
↓
执行时间线
↓
工具调用卡片
↓
中间结果
↓
最终答案
```

### 6.3 安全边界

AI 应用必须考虑：

- Prompt Injection
- 越权读取文件
- 工具误调用
- 敏感信息泄露
- 用户上传恶意文件
- 代码执行沙箱
- API Key 泄露
- 成本攻击

最小安全策略：

```text
工具白名单
参数校验
权限校验
最大执行步数
最大 Token 限制
日志审计
人工确认危险操作
```

---

## 7. Phase 6：Eval / Observability

这是从 Demo 到工程项目的分水岭。

### 7.1 为什么要评测？

很多 AI 应用的问题是：

```text
看起来能用
但不知道准不准
今天能用，明天可能变差
Prompt 改了以后不知道有没有退化
模型换了以后不知道效果如何
```

所以必须有 Eval。

### 7.2 你需要评测什么？

RAG 评测：

- 检索是否命中正确文档
- 引用是否准确
- 回答是否基于上下文
- 是否幻觉
- 是否遗漏关键信息

Agent 评测：

- 是否选择了正确工具
- 工具参数是否正确
- 是否完成任务
- 是否陷入循环
- 是否越权操作
- 总步数是否合理

产品评测：

- 响应时间
- Token 成本
- 失败率
- 用户满意度
- Bad Case 数量

### 7.3 Langfuse

建议接入 Langfuse，学习：

- Trace
- Session
- Generation
- Tool Call 记录
- Prompt 管理
- Dataset
- Evaluation
- Cost Tracking

你项目里至少应该展示：

```text
每次请求的 Prompt、模型输出、工具调用、耗时、Token、费用、用户反馈。
```

---

## 8. Phase 7：平台与中间件

这一阶段不是入门必学，但适合你做完项目后继续扩展。

### 8.1 MaaS

MaaS = Model as a Service。

你需要理解：

- 模型统一接入
- 模型部署
- 模型调用
- API Key 管理
- 计费
- 限流
- 模型路由
- 模型监控

典型平台：

- OpenAI Platform
- 阿里云百炼
- 火山方舟
- 硅基流动
- 智谱开放平台

### 8.2 AI Gateway

AI Gateway 解决：

- 多模型统一入口
- 请求转发
- 模型路由
- 限流
- 熔断
- 监控
- 成本统计
- Key 管理
- MCP 托管

可以了解 Higress。

### 8.3 Agent Runtime

Agent Runtime 解决：

- Agent 在哪里运行
- 工具调用如何隔离
- 代码执行如何沙箱化
- 如何快速启动
- 如何扩缩容
- 如何长期运行

它和你之前关注的 Agent OS、OpenClaw、Hermes、24/7 Agent 有关系。

### 8.4 K8s / Ray / Kubeflow

这些偏平台化：

| 技术 | 作用 |
|---|---|
| K8s | 容器编排、部署、扩缩容 |
| Ray | 分布式计算、分布式推理、任务并发 |
| Kubeflow | 机器学习工作流、MLOps 平台 |

学习顺序建议：

```text
Docker
↓
基础部署
↓
CI/CD
↓
K8s 基础
↓
Ray / Kubeflow
```

不要一开始就深挖它们。

---

## 9. Phase 8：进阶方向

等你完成一个完整 AI 应用项目后，可以选择分叉。

### 方向 A：AI 应用工程师

重点：

- RAG
- Agent
- 前端 AI 交互
- 后端服务
- 评测
- 部署

适合你当前阶段。

### 方向 B：Agent 工程师

重点：

- Agent Loop
- Multi-Agent
- MCP
- Tool Runtime
- Agent Memory
- Agent Eval
- Agent Runtime

适合你对 Claude Code / Codex / OpenClaw 感兴趣的方向。

### 方向 C：AI 平台工程师

重点：

- MaaS
- AI Gateway
- K8s
- Ray
- Kubeflow
- 模型服务
- 多租户
- 资源调度

适合中后期发展。

### 方向 D：ML / 模型工程师

重点：

- 机器学习
- 深度学习
- 微调
- 训练
- 推理优化
- 数据集
- 评测

如果你未来想转模型侧，需要额外补数学和算法。

---

## 10. 推荐学习顺序：12 周版本

### 第 1-2 周：AI API + 后端接口

目标：能写一个完整的 AI Chat API。

学习：

- Go / Node / Python 后端任选一种
- HTTP API
- SSE 流式输出
- OpenAI Compatible API
- Prompt 基础
- JSON 输出

产出：

```text
AI Chat Web App
```

功能：

- 输入问题
- 流式输出
- 历史记录
- 错误处理
- 模型切换

---

### 第 3-4 周：RAG 入门项目

目标：做一个基础文档问答系统。

学习：

- PDF / Markdown 解析
- Chunking
- Embedding
- 向量数据库
- 相似度检索
- 引用来源

产出：

```text
Mini RAG Knowledge Base
```

功能：

- 上传文档
- 自动入库
- 提问
- 返回答案和引用

---

### 第 5-6 周：RAG 进阶

目标：让 RAG 从 Demo 变成可用系统。

学习：

- BM25
- Hybrid Search
- Rerank
- Query Rewrite
- Metadata Filter
- Bad Case 分析

产出：

```text
Advanced RAG System
```

功能：

- 混合检索
- 重排
- 多文档检索
- 检索结果可视化
- 简单评测集

---

### 第 7-8 周：Agent 基础

目标：手写一个最小 Agent。

学习：

- Agent Loop
- ReAct
- Tool Calling
- Memory
- 最大步数控制
- 工具错误处理

产出：

```text
Tool-Using Agent
```

功能：

- 搜索工具
- 文件读取工具
- 计算工具
- 自动选择工具
- 展示工具调用过程

---

### 第 9-10 周：LangGraph / Workflow

目标：做一个可控的工作流 Agent。

学习：

- LangGraph State
- Node
- Edge
- Conditional Edge
- Checkpoint
- Human-in-the-loop

产出：

```text
Research Report Agent
```

功能：

- 输入主题
- 拆解问题
- 搜索资料
- 整理大纲
- 人工确认
- 生成 Markdown 报告

---

### 第 11 周：Eval / Observability

目标：给 AI 项目加工程化能力。

学习：

- Langfuse
- Trace
- Prompt 版本
- Dataset
- 自动评测
- Token 成本统计

产出：

```text
AI App Observability Dashboard
```

功能：

- 每次请求可追踪
- 每次工具调用可查看
- Prompt 可版本化
- 成本可统计
- Bad Case 可记录

---

### 第 12 周：部署和作品整理

目标：变成可展示项目。

学习：

- Docker
- 环境变量
- 部署
- README
- 技术文章
- 架构图
- Demo 视频

产出：

```text
一个完整的 AI Engineer 作品集项目
```

项目材料：

- GitHub 仓库
- README
- 架构图
- 在线 Demo
- 技术博客
- 简历项目描述

---

## 11. 推荐项目路线

### 项目 1：AI Chat Playground

难度：入门

覆盖能力：

- 模型 API
- 流式输出
- Prompt
- 多模型切换
- 前端交互

简历价值：低到中。

---

### 项目 2：AI 个人知识库

难度：中等

覆盖能力：

- RAG
- 文档解析
- Embedding
- 向量数据库
- 引用溯源
- 混合检索

简历价值：中到高。

---

### 项目 3：Research Agent

难度：中高

覆盖能力：

- Agent Loop
- Tool Calling
- 搜索
- Workflow
- LangGraph
- Human-in-the-loop
- Markdown 生成

简历价值：高。

---

### 项目 4：AI Coding Assistant Lite

难度：高

覆盖能力：

- 文件系统工具
- 代码阅读
- Patch 生成
- Git Diff
- MCP
- 安全边界
- Agent 评测

简历价值：很高。

---

### 项目 5：AI 应用观测平台 Demo

难度：高

覆盖能力：

- Langfuse
- Trace
- Prompt 管理
- Eval
- Token 成本
- Bad Case 管理

简历价值：很高，偏工程化。

---

## 12. 你当前最推荐的主线项目

结合你的背景，最推荐做：

```text
AI Knowledge Agent：个人知识库 + RAG + Agent + 可观测
```

### 项目定位

一个可以上传资料、检索资料、调用工具、生成报告的 AI 知识工作台。

### 技术栈建议

前端：

```text
Next.js
TypeScript
Tailwind CSS
shadcn/ui
SSE Streaming
```

后端：

```text
Go / Python FastAPI 二选一
PostgreSQL
pgvector / Qdrant
Redis
Docker
```

AI 层：

```text
OpenAI Compatible API
Embedding Model
Rerank Model
LangGraph
MCP
Langfuse
```

### 功能规划

MVP：

- 上传文档
- 文档解析
- Chunk 入库
- 问答
- 引用来源
- 流式输出

V1：

- 混合检索
- Rerank
- Query Rewrite
- 多文档对比
- 会话历史

V2：

- Agent 工具调用
- 自动生成报告
- Human-in-the-loop
- Langfuse Trace
- 评测集

V3：

- MCP 工具扩展
- 权限控制
- 多用户
- 成本统计
- 部署上线

---

## 13. 简历表达模板

### 普通表达

```text
实现了一个基于 RAG 的 AI 知识库系统，支持文档上传、向量检索和智能问答。
```

### 更好的表达

```text
设计并实现 AI Knowledge Agent，支持 PDF / Markdown 文档解析、Chunk 切分、Embedding 入库、BM25 + 向量混合检索、Rerank、引用溯源和流式问答；接入 Langfuse 实现 Prompt、模型调用、工具调用和 Token 成本的可观测，并构建小规模评测集用于分析 RAG Bad Case。
```

### 更偏 Agent 的表达

```text
基于 LangGraph 实现 Research Agent，通过状态图编排任务拆解、资料检索、工具调用、人工确认和报告生成流程；设计 Tool Calling 抽象，支持搜索、文件读取、知识库检索等工具，并通过最大步数、参数校验和调用日志提升 Agent 执行稳定性。
```

---

## 14. 学习材料建议

### 必读

- roadmap.sh AI Engineer
- roadmap.sh Backend
- roadmap.sh Go
- roadmap.sh AI Agents
- OpenAI / Anthropic / Google 官方文档
- LangGraph 文档
- Langfuse 文档
- MCP 官方文档

### 可选

- Dify
- Coze
- n8n
- CrewAI
- AutoGen
- mem0
- LlamaIndex
- Haystack
- Higress
- Ray
- Kubeflow

### 学习原则

```text
先理解原理
再使用框架
最后做工程化封装
```

不要反过来：

```text
先收集框架
再复制 Demo
最后发现自己不知道系统为什么能跑
```

---

## 15. 不建议现在投入太多的内容

这些可以了解，但不建议作为当前主线：

- 从零训练大模型
- CUDA
- 大规模分布式训练
- PPO / DPO 深入实现
- Kubeflow 深度实践
- Ray 深度实践
- K8s 大规模集群治理
- 复杂多 Agent 系统
- 过早学习所有 Agent 框架

原因：

> 你当前最需要的是能做出完整 AI 应用，而不是把所有 AI 技术名词都学一遍。

---

## 16. 每阶段验收标准

### 工程底座验收

你能否独立完成：

- 一个后端 API
- 一个数据库表设计
- 一个文件上传接口
- 一个 SSE 流式接口
- 一个 Docker 部署

### AI 基础验收

你能否解释：

- Token 是什么
- Function Calling 怎么工作
- Streaming 怎么实现
- Prompt 为什么要版本管理
- 模型输出为什么不稳定

### RAG 验收

你能否实现：

- 文档解析
- Chunking
- Embedding
- 向量检索
- Hybrid Search
- Rerank
- 引用溯源

### Agent 验收

你能否实现：

- Agent Loop
- Tool Calling
- 工具错误处理
- 最大步数控制
- Memory
- Workflow

### 工程化验收

你能否说明：

- 如何评测效果
- 如何发现 Bad Case
- 如何追踪 Token 成本
- 如何定位某次模型调用的问题
- 如何避免危险工具调用

---

## 17. 最终目标

完成这条路线后，你应该拥有：

```text
1. 一个完整 AI 应用项目
2. 一个 Agent 项目
3. 一篇技术复盘文章
4. 一套 RAG / Agent 评测方法
5. 一份能讲清楚的简历项目
6. 对 AI 平台和中间件的基本理解
```

你要达到的状态不是：

```text
我看过很多 AI 框架。
```

而是：

```text
我能设计、实现、评测、部署一个 AI 应用，并解释它为什么这样设计。
```

---

## 18. 最简执行版

如果只保留一条主线，就按这个走：

```text
1. 补 Go / 后端 API
2. 学 LLM API 和流式输出
3. 做 AI Chat Web App
4. 学 Embedding 和向量数据库
5. 做 RAG 知识库
6. 加 BM25 + Rerank
7. 手写 Agent Loop
8. 学 LangGraph
9. 做 Research Agent
10. 接入 Langfuse
11. 加评测集
12. Docker 部署
13. 写 README 和技术博客
14. 放进简历
```

这就是最适合你当前阶段的 AI Engineer Roadmap。
