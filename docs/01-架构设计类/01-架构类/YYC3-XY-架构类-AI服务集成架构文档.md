---

# YYC³-XY 架构类 - AI服务集成架构文档

> ***YanYuCloudCube***
> **标语**：言启象限 | 语枢未来
> ***Words Initiate Quadrants, Language Serves as Core for the Future***
> **标语**：万象归元于云枢 | 深栈智启新纪元
> ***All things converge in the cloud pivot; Deep stacks ignite a new era of intelligence***

---

/**
 * @file AI服务集成架构文档
 * @description YYC³-XY智能成长守护系统的AI服务集成架构设计，包括本地AI模型集成、RAG知识增强、服务接口设计和性能优化策略
 * @module 架构类-AI服务集成架构
 * @author YYC³
 * @version 1.0.0
 * @created 2025-12-24
 * @updated 2025-12-28
 * @copyright Copyright (c) 2025 YYC³
 * @license MIT
 */

## 文档信息

- **文件名称**: YYC3-XY-架构类-AI服务集成架构文档.md
- **文档类型**: 架构类
- **创建日期**: 2025-12-24
- **更新日期**: 2025-12-28
- **版本号**: V1.0.0
- **文档状态**: 已发布

---

## 概述

本文档描述YYC³-XY智能成长守护系统的AI服务集成架构设计，包括本地AI模型集成、RAG知识增强、服务接口设计和性能优化策略。文档遵循 YYC³-XY 项目"五高五标五化"架构原则。

---

## 目录

1. [五高五标五化原则体现](#五高五标五化原则体现)
2. [AI服务架构概述](#ai服务架构概述)
3. [本地AI模型集成](#本地ai模型集成)
4. [RAG知识增强](#rag知识增强)
5. [服务接口设计](#服务接口设计)
6. [性能优化策略](#性能优化策略)
- **部署标准化** - 采用标准化部署方案

**五化架构：**
- **流程化** - 将工作转化为可执行流程
- **文档化** - 完整记录技术方案和实施细节
- **工具化** - 提供自动化工具支持
- **数字化** - 基于数据进行决策
- **生态化** - 构建完整的技术生态


## 目录


## 一、概述
### 1.1 文档目的

本文档详细描述YYC³-XY智能成长守护系统的AI服务集成架构，包括本地AI模型集成、RAG知识增强、服务接口设计和性能优化策略，为开发和维护团队提供技术指导。

### 1.2 适用范围

本文档适用于YYC³-XY系统的AI服务开发、集成和维护人员。

### 1.3 参考文档

- YYC³-XY总体架构设计文档
- YYC³-XY微服务架构设计文档
- YYC³-XY数据架构设计文档
- YYC³-XY前端架构设计文档

### 1.4 术语定义

| 术语 | 定义 |
|------|------|
| RAG | 检索增强生成（Retrieval-Augmented Generation），结合知识检索和AI生成的技术 |
| 向量数据库 | 专门用于存储和检索向量数据的数据库，支持相似度搜索 |
| 嵌入模型 | 将文本转换为向量表示的深度学习模型 |
| 本地AI | 在本地部署的AI模型，无需依赖外部API |
| 知识库 | 存储结构化和非结构化知识的数据库 |
| Ollama | 本地AI模型运行框架，支持多种大语言模型 |
| ChromaDB | 开源向量数据库，用于存储和检索文档嵌入 |

## 二、AI服务架构概述
### 2.1 架构总览
YYC³-XY系统采用分层AI服务架构，包括基础设施层、数据层、服务层、接口层和应用层，实现本地AI能力与知识增强的深度融合。
┌─────────────────────────────────────────────────────────────┐
│                        应用层                                │
│  ┌──────────┐  ┌──────────┐  ┌──────────┐  ┌──────────┐   │
│  │ 聊天界面 │  │ 知识库   │  │ 仪表盘   │  │ 设置页面 │   │
│  └──────────┘  └──────────┘  └──────────┘  └──────────┘   │
└─────────────────────────────────────────────────────────────┘
                              ↓
┌─────────────────────────────────────────────────────────────┐
│                        接口层                                │
│  ┌──────────────────────────────────────────────────────┐   │
│  │              LocalAIGateway (Hono)                   │   │
│  │  /api/chat  /api/chat/stream  /api/models  /api/...  │   │
│  └──────────────────────────────────────────────────────┘   │
└─────────────────────────────────────────────────────────────┘
                              ↓
┌─────────────────────────────────────────────────────────────┐
│                        服务层                                │
│  ┌──────────────────┐  ┌──────────────────┐                │
│  │  OllamaService   │  │   RAGEngine      │                │
│  │  - 模型管理      │  │  - 知识检索      │                │
│  │  - 推理执行      │  │  - 上下文构建    │                │
│  │  - 性能监控      │  │  - 增强生成      │                │
│  └──────────────────┘  └──────────────────┘                │
└─────────────────────────────────────────────────────────────┘
                              ↓
┌─────────────────────────────────────────────────────────────┐
│                        数据层                                │
│  ┌──────────────┐  ┌──────────────┐  ┌──────────────┐      │
│  │    Ollama    │  │   ChromaDB   │  │  PostgreSQL  │      │
│  │  本地AI模型  │  │  向量数据库  │  │  关系数据库  │      │
│  └──────────────┘  └──────────────┘  └──────────────┘      │
└─────────────────────────────────────────────────────────────┘
                              ↓
┌─────────────────────────────────────────────────────────────┐
│                      基础设施层                              │
│  ┌──────────────┐  ┌──────────────┐  ┌──────────────┐      │
│  │   Docker     │  │   GPU/CPU    │  │   网络/存储  │      │
│  │  容器化部署  │  │  计算资源    │  │  基础设施    │      │
│  └──────────────┘  └──────────────┘  └──────────────┘      │
└─────────────────────────────────────────────────────────────┘
### 2.2 核心组件

| 组件名称 | 主要功能 | 技术选型 | 端口 |
|----------|----------|----------|------|
| LocalAIGateway | AI服务网关，统一接口 | Hono | 8081 |
| OllamaService | 本地AI模型管理与推理 | Ollama | 11434 |
| RAGEngine | 知识检索与增强生成 | ChromaDB | 8000 |
| KnowledgeManager | 知识库管理 | TypeScript | - |

### 2.3 技术栈

| 类别 | 技术选型 | 版本 |
|------|----------|------|
| Web框架 | Hono | Latest |
| AI推理 | Ollama | Latest |
| 向量数据库 | ChromaDB | Latest |
| 嵌入模型 | sentence-transformers/all-MiniLM-L6-v2 | Latest |
| 语言 | TypeScript | 5.x |
| 运行时 | Bun | Latest |

## 三、本地AI模型集成
3.1 OllamaService设计
3.1.1 核心功能
OllamaService负责本地AI模型的完整生命周期管理，包括模型加载、推理执行、性能监控和资源管理。

```typescript
export class OllamaService {
  private baseURL: string;
  private currentModel: string;
  private requestQueue: Map<string, AbortController> = new Map();
  private metrics: PerformanceMetrics;
  private healthCache: HealthStatus | null = null;
  private lastHealthCheck: number = 0;
}
```

### 3.1.2 聊天对话接口

```typescript
async chat(messages: ChatMessage[], options: ChatOptions = {}): Promise<ChatResponse>
```

**功能说明：**
- 执行AI聊天对话，支持多轮对话
- 支持自定义模型、温度、最大token数等参数
- 自动收集性能指标
- 支持请求取消机制

**请求参数：**

```typescript
interface ChatMessage {
  role: 'user' | 'assistant' | 'system';
  content: string;
  timestamp?: number;
}

interface ChatOptions {
  model?: string;
  temperature?: number;
  max_tokens?: number;
  top_p?: number;
  stream?: boolean;
}
```

**响应格式：**

```typescript
interface ChatResponse {
  message: ChatMessage;
  usage: {
    prompt_tokens: number;
    completion_tokens: number;
    total_tokens: number;
  };
  model: string;
  created_at: string;
  done: boolean;
  thinking_time?: number;
}
```

### 3.1.3 模型管理接口

获取模型列表：
```typescript
async listModels(): Promise<ModelInfo[]>
```

下载模型：
```typescript
async pullModel(
  modelName: string,
  onProgress?: (progress: { status: string; completed: number; total: number }) => void
): Promise<void>
```

切换模型：
```typescript
async switchModel(modelName: string): Promise<void>
```

### 3.1.4 健康检查

```typescript
async healthCheck(): Promise<HealthStatus>
```

**健康状态定义：**

```typescript
interface HealthStatus {
  status: 'healthy' | 'degraded' | 'unhealthy';
  models_loaded: string[];
  gpu_available: boolean;
  memory_usage: {
    used: number;
    total: number;
    percentage: number;
  };
  response_time: {
    avg: number;
    p95: number;
    p99: number;
  };
}
```

**健康判断标准：**
- healthy: 响应时间 < 5秒，内存使用 < 70%
- degraded: 响应时间 5-10秒，内存使用 70-90%
- unhealthy: 响应时间 > 10秒，内存使用 > 90%

### 3.1.5 性能指标收集

```typescript
interface PerformanceMetrics {
  total_requests: number;
  successful_requests: number;
  failed_requests: number;
  avg_response_time: number;
  requests_per_minute: number;
  gpu_utilization: number;
  memory_usage: number;
  model_load_time: number;
}
```### 3.2 模型选择策略

#### 3.2.1 推荐模型

| 模型名称 | 参数量 | 适用场景 | 推荐配置 |
|----------|--------|----------|----------|
| llama3.1:8b | 8B | 通用对话、教育指导 | 默认模型 |
| llama3.1:70b | 70B | 复杂推理、深度分析 | 高性能环境 |
| mistral:7b | 7B | 快速响应、轻量场景 | 边缘设备 |
| qwen2:7b | 7B | 中文优化、教育场景 | 中文为主 |

#### 3.2.2 模型切换策略

1. 自动切换：根据系统负载和响应时间自动选择模型
2. 手动切换：用户可在设置中选择偏好模型
3. 场景切换：根据任务类型自动选择最适合的模型

### 3.3 性能优化

#### 3.3.1 请求队列管理

```typescript
private requestQueue: Map<string, AbortController> = new Map();
```

- 支持请求取消，避免资源浪费
- 限制并发请求数量，防止系统过载
- 实现请求优先级调度

#### 3.3.2 缓存策略

- 健康检查缓存：30秒内复用健康检查结果
- 模型预热：切换模型时预先加载，减少首次响应延迟
- 响应缓存：对常见问题进行响应缓存

#### 3.3.3 资源管理

- GPU利用率监控：实时监控GPU使用情况
- 内存管理：动态调整内存分配，避免OOM
- 模型卸载：长时间未使用的模型自动卸载

## 四、RAG知识增强架构
4.1 RAGEngine设计
4.1.1 核心功能
RAGEngine实现检索增强生成，通过知识检索和上下文构建，提升AI回答的准确性和专业性。

```typescript
export class RAGEngine {
  private chromaURL: string;
  private collectionName: string;
  private embeddingModel: string;
  private maxContextLength: number;
  private topK: number;
  private similarityThreshold: number;
}
```

### 4.1.2 知识检索流程

用户查询 → 向量化检索 → 相似度计算 → 结果过滤 → 重排序 → Top-K返回

**检索接口：**

```typescript
async retrieveKnowledge(query: SearchQuery): Promise<RetrievalResult[]>
```

**查询参数：**

```typescript
interface SearchQuery {
  text: string;
  filters?: {
    category?: string;
    age_group?: string[];
    difficulty_level?: string;
    tags?: string[];
  };
  top_k?: number;
  similarity_threshold?: number;
}
```

**检索结果：**

```typescript
interface RetrievalResult {
  id: string;
  content: string;
  metadata: KnowledgeDocument['metadata'];
  score: number;
  relevance: 'high' | 'medium' | 'low';
  highlights: string[];
}
```

### 4.1.3 上下文构建

```typescript
async buildContext(context: RAGContext): Promise<string>
```

**上下文组成：**
1. 用户上下文：儿童年龄、兴趣爱好、学习水平等
2. 知识上下文：检索到的相关知识文档
3. 对话上下文：历史对话记录
4. 当前问题：用户当前提出的问题

**上下文结构：**

```
=== 用户上下文 ===
儿童年龄: 6岁
兴趣爱好: 绘画、音乐
学习水平: 小学一年级

=== 相关知识 ===
知识 1 (相关度: 85.3%):
标题: 儿童兴趣培养方法
分类: 兴趣培养
难度: beginner
...

=== 对话历史 ===
用户: 如何培养孩子的绘画兴趣？
AI: ...

=== 当前问题 ===
用户问题：有什么具体的绘画练习方法吗？
```

### 4.1.4 增强生成

```typescript
async generateResponse(context: RAGContext): Promise<RAGResponse>
```

**生成流程：**
1. 构建增强上下文
2. 生成RAG提示模板
3. 调用本地AI模型生成回答
4. 解析和增强AI响应

**响应格式：**

```typescript
interface RAGResponse {
  answer: string;
  sources: RetrievalResult[];
  confidence: number;
  reasoning: string;
  related_questions: string[];
  follow_up_suggestions: string[];
}
```4.2 知识库管理
4.2.1 知识文档结构
interface KnowledgeDocument {
  id: string;
  content: string;
  metadata: {
    title: string;
    category: string;
    tags: string[];
    age_group: string[];
    difficulty_level: 'beginner' | 'intermediate' | 'advanced';
    source: string;
    author?: string;
    created_at: string;
    updated_at: string;
    language: string;
    word_count: number;
  };
}4.2.2 知识分类体系
分类
说明
文档数量

儿童心理学
儿童心理发展、情绪管理
150

教育方法
学习方法、教学技巧
120

亲子关系
亲子沟通、家庭氛围
100

兴趣培养
兴趣发现、技能培养
80

安全教育
安全意识、自我保护
60

4.2.3 知识管理接口
添加知识：
async addKnowledge(documents: KnowledgeDocument[]): Promise<void>更新知识：
async updateKnowledge(document: KnowledgeDocument): Promise<void>删除知识：
async deleteKnowledge(id: string): Promise<void>获取统计：
async getKnowledgeStats(): Promise<{
  total_documents: number;
  categories: { [key: string]: number };
  age_groups: { [key: string]: number };
  difficulty_levels: { [key: string]: number };
}>4.3 检索优化
4.3.1 重排序策略
基于多个因子对检索结果进行重排序：
• 相似度分数：主要排序依据
• 新近性加权：优先返回更新的内容
• 内容长度加权：平衡内容详细程度
• 用户偏好加权：根据用户历史行为调整
private async rererankResults(query: string, results: RetrievalResult[]): Promise<RetrievalResult[]>4.3.2 高亮生成
自动生成查询关键词在文档中的高亮片段，帮助用户快速定位相关信息。
private generateHighlights(query: string, document: string): string[]4.3.3 上下文截断
当上下文长度超过限制时，智能截断优先保留重要内容。
private truncateContext(context: string, maxLength: number): string4.4 提示工程
4.4.1 RAG提示模板
根据用户年龄组动态生成适合的提示模板：
private buildRAGPrompt(context: string, userContext?: RAGContext['user_context']): string提示模板示例（3-6岁学龄前儿童）：
你是一位专业的儿童教育AI助手，专门为3-6岁学龄前儿童提供教育指导和成长建议。

你的任务：
1. 基于提供的知识库内容，给出准确、有用的回答
2. 使用适合3-6岁儿童理解的语言表达
3. 保持友好、耐心、鼓励的语调
4. 提供具体、可操作的建议
5. 优先考虑儿童的安全和健康发展

回答要求：
- 内容准确且有教育价值
- 语言简单易懂，避免复杂术语
- 语调温暖亲切，富有鼓励性
- 提供实用的建议和方法
- 适当使用例子和比喻
- 避免说教，采用引导式表达

[上下文内容]

请基于以上信息，为用户的问题提供专业、友好的回答。4.4.2 年龄组适配
年龄组
语言特点
举例

3-6岁
简单、形象、多用比喻
"就像小树苗需要阳光和雨水一样"

7-12岁
具体、实用、可操作
"每天练习15分钟，坚持一个月"

13-18岁
专业、尊重、引导式
"建议你尝试以下方法..."

5. API网关设计
5.1 LocalAIGateway架构
5.1.1 框架选择
使用Hono作为Web框架，优势：
• 轻量级、高性能
• 原生TypeScript支持
• 优秀的中间件生态
• 易于测试和维护
5.1.2 中间件配置
app.use('*', cors({
  origin: ['http://localhost:3000', 'http://localhost:1229', 'http://localhost:8080'],
  allowMethods: ['GET', 'POST', 'PUT', 'DELETE', 'OPTIONS'],
  allowHeaders: ['Content-Type', 'Authorization'],
  credentials: true,
}));

app.use('*', logger());5.2 API端点设计
5.2.1 健康检查
端点：GET /health
响应：
{
  "status": "healthy",
  "timestamp": "2024-06-24T10:00:00.000Z",
  "services": {
    "ollama": {
      "status": "healthy",
      "models_loaded": ["llama3.1:8b"],
      "gpu_available": true
    },
    "gateway": {
      "status": "healthy",
      "uptime": 3600,
      "memory": {
        "used": 1024,
        "total": 8192
      }
    }
  },
  "metrics": {
    "total_requests": 1000,
    "successful_requests": 980,
    "avg_response_time": 2500
  }
}5.2.2 AI聊天
端点：POST /api/chat
请求：
{
  "messages": [
    { "role": "user", "content": "如何培养孩子的学习兴趣？" }
  ],
  "options": {
    "model": "llama3.1:8b",
    "temperature": 0.7,
    "max_tokens": 1024
  },
  "use_rag": true,
  "user_context": {
    "child_age": 6,
    "interests": ["绘画", "音乐"]
  }
}响应：
{
  "success": true,
  "data": {
    "answer": "培养孩子的学习兴趣可以从以下几个方面入手...",
    "sources": [
      {
        "id": "doc_001",
        "content": "...",
        "score": 0.85,
        "relevance": "high"
      }
    ],
    "confidence": 0.87,
    "reasoning": "基于教育方法、兴趣培养等领域的专业知识进行分析",
    "related_questions": [
      "如何选择适合孩子的学习方法？"
    ],
    "follow_up_suggestions": [
      "观察孩子的反应，适时调整方法"
    ],
    "model": "llama3.1:8b",
    "usage": {
      "prompt_tokens": 150,
      "completion_tokens": 300,
      "total_tokens": 450
    },
    "thinking_time": 2500
  },
  "timestamp": "2024-06-24T10:00:00.000Z"
}5.2.3 流式聊天
端点：POST /api/chat/stream
响应格式：Server-Sent Events (SSE)
event: start
data: {"type":"start","requestId":"req_123","timestamp":"..."}

event: message
data: {"type":"message","requestId":"req_123","content":"培养","done":false,"timestamp":"..."}

event: message
data: {"type":"message","requestId":"req_123","content":"孩子的","done":false,"timestamp":"..."}

event: end
data: {"type":"end","requestId":"req_123","timestamp":"..."}5.2.4 模型管理
获取模型列表：GET /api/models
拉取模型：POST /api/models/pull
切换模型：POST /api/models/switch
删除模型：DELETE /api/models/:model
5.2.5 知识检索
搜索知识：POST /api/knowledge/search
添加文档：POST /api/knowledge/documents
获取统计：GET /api/knowledge/stats
5.2.6 性能指标
端点：GET /api/metrics
响应：
{
  "success": true,
  "data": {
    "ollama": {
      "total_requests": 1000,
      "successful_requests": 980,
      "failed_requests": 20,
      "avg_response_time": 2500,
      "requests_per_minute": 100
    },
    "health": {
      "status": "healthy",
      "models_loaded": ["llama3.1:8b"]
    },
    "knowledge": {
      "total_documents": 510,
      "categories": {
        "儿童心理学": 150,
        "教育方法": 120
      }
    },
    "system": {
      "uptime": 3600,
      "memory": {
        "used": 1024,
        "total": 8192
      }
    }
  },
  "timestamp": "2024-06-24T10:00:00.000Z"
}5.3 错误处理
5.3.1 错误响应格式
{
  "success": false,
  "error": "错误描述",
  "code": "ERROR_CODE",
  "timestamp": "2024-06-24T10:00:00.000Z"
}5.3.2 错误码定义
错误码
说明
HTTP状态码

INVALID_MESSAGES
消息格式无效
400

EMPTY_MESSAGES
消息为空
400

MISSING_MODEL_NAME
缺少模型名称
400

MISSING_QUERY
缺少查询内容
400

MISSING_DOCUMENTS
缺少文档数据
400

CHAT_FAILED
聊天失败
500

STREAM_CHAT_FAILED
流式聊天失败
500

LIST_MODELS_FAILED
获取模型列表失败
500

PULL_MODEL_FAILED
拉取模型失败
500

SWITCH_MODEL_FAILED
切换模型失败
500

DELETE_MODEL_FAILED
删除模型失败
500

KNOWLEDGE_SEARCH_FAILED
知识检索失败
500

ADD_KNOWLEDGE_FAILED
添加知识失败
500

KNOWLEDGE_STATS_FAILED
获取统计失败
500

METRICS_FAILED
获取指标失败
500

NOT_FOUND
端点不存在
404

INTERNAL_ERROR
内部错误
500

5.4 安全机制
5.4.1 CORS配置
限制允许的来源、方法和头部，防止跨域攻击。
5.4.2 请求验证
• 参数类型验证
• 参数范围验证
• 必填参数检查
5.4.3 速率限制
建议实现速率限制，防止API滥用：
• 每用户每分钟最多60次请求
• 每IP每分钟最多120次请求
6. 性能优化策略
6.1 响应时间优化
6.1.1 流式响应
对于长文本生成，使用流式响应减少用户等待时间：
• 首字响应时间 < 1秒
• 每个token生成间隔 < 100ms
6.1.2 模型预热
切换模型时预先执行一次推理，确保模型已加载到内存：
async switchModel(modelName: string): Promise<void> {
  await this.chat([{ role: 'user', content: 'Hello' }], { model: modelName });
  this.currentModel = modelName;
}6.1.3 缓存策略
• 健康检查缓存：30秒
• 模型列表缓存：5分钟
• 常见问题缓存：1小时
6.2 资源利用优化
6.2.1 GPU利用率
• 监控GPU使用率，目标保持在60-80%
• 根据负载动态调整批处理大小
• 优先使用GPU加速的模型
6.2.2 内存管理
• 限制并发请求数量，防止OOM
• 长时间未使用的模型自动卸载
• 使用量化模型减少内存占用
6.2.3 模型量化
使用量化模型减少显存占用：
• FP16：显存减少50%
• INT8：显存减少75%
• INT4：显存减少87.5%
6.3 并发处理
6.3.1 请求队列
使用Map管理请求队列，支持取消操作：
private requestQueue: Map<string, AbortController> = new Map();6.3.2 并发限制
限制最大并发请求数，建议：
• 8B模型：最多10个并发请求
• 70B模型：最多3个并发请求
6.3.3 请求优先级
实现请求优先级调度：
• 高优先级：实时对话
• 中优先级：知识检索
• 低优先级：后台任务
7. 监控与告警
7.1 健康监控
7.1.1 健康检查指标
• 服务可用性
• 模型加载状态
• GPU可用性
• 内存使用率
• 响应时间
7.1.2 健康检查频率
• 正常情况：每30秒
• 异常情况：每10秒
• 恢复后：每60秒
7.2 性能监控
7.2.1 关键指标
指标
目标值
告警阈值

平均响应时间
< 3秒
> 5秒

P95响应时间
< 5秒
> 10秒

P99响应时间
< 8秒
> 15秒

成功率
> 99%
< 95%

GPU利用率
60-80%
> 90%

内存使用率
< 70%
> 85%

7.2.2 指标收集
interface PerformanceMetrics {
  total_requests: number;
  successful_requests: number;
  failed_requests: number;
  avg_response_time: number;
  requests_per_minute: number;
  gpu_utilization: number;
  memory_usage: number;
  model_load_time: number;
}7.3 告警策略
7.3.1 告警级别
级别
触发条件
通知方式

P0
服务不可用
电话、短信、邮件

P1
响应时间 > 10秒
短信、邮件

P2
成功率 < 95%
邮件

P3
GPU利用率 > 90%
邮件

7.3.2 告警恢复
• 服务恢复后自动发送恢复通知
• 记录告警历史，便于问题追溯
7.4 日志管理
7.4.1 日志级别
• ERROR：错误信息
• WARN：警告信息
• INFO：一般信息
• DEBUG：调试信息
7.4.2 日志格式
{
  "timestamp": "2024-06-24T10:00:00.000Z",
  "level": "INFO",
  "service": "LocalAIGateway",
  "message": "Chat API called",
  "requestId": "req_123",
  "userId": "user_456",
  "model": "llama3.1:8b",
  "responseTime": 2500
}7.4.3 日志保留
• 错误日志：保留90天
• 访问日志：保留30天
• 调试日志：保留7天
8. 部署架构
8.1 容器化部署
8.1.1 Docker Compose配置
version: '3.8'

services:
  ollama:
    image: ollama/ollama:latest
    ports:
      - "11434:11434"
    volumes:
      - ollama_data:/root/.ollama
    deploy:
      resources:
        reservations:
          devices:
            - driver: nvidia
              count: 1
              capabilities: [gpu]
    environment:
      - OLLAMA_HOST=0.0.0.0

  chroma:
    image: chromadb/chroma:latest
    ports:
      - "8000:8000"
    volumes:
      - chroma_data:/chroma/chroma

  ai-gateway:
    build: .
    ports:
      - "8081:8081"
    depends_on:
      - ollama
      - chroma
    environment:
      - OLLAMA_BASE_URL=http://ollama:11434
      - CHROMA_URL=http://chroma:8000
      - PORT=8081

volumes:
  ollama_data:
  chroma_data:8.1.2 环境变量配置
# Ollama配置
OLLAMA_BASE_URL=http://localhost:11434
OLLAMA_DEFAULT_MODEL=llama3.1:8b

# ChromaDB配置
CHROMA_URL=http://localhost:8000
CHROMA_COLLECTION_NAME=yyc3_knowledge_base
CHROMA_EMBEDDING_MODEL=sentence-transformers/all-MiniLM-L6-v2

# RAG配置
RAG_MAX_CONTEXT_LENGTH=4000
RAG_TOP_K=5
RAG_SIMILARITY_THRESHOLD=0.7

# 网关配置
PORT=8081
HOST=0.0.0.08.2 扩展性设计
8.2.1 水平扩展
• AI网关支持多实例部署
• 使用负载均衡分发请求
• 实现会话亲和性保持对话连续性
8.2.2 垂直扩展
• 根据负载动态调整资源配置
• 支持GPU集群部署
• 实现模型分片，处理更大模型
8.3 高可用性
8.3.1 服务冗余
• 部署多个AI网关实例
• 使用健康检查自动剔除故障实例
• 实现自动故障转移
8.3.2 数据备份
• 定期备份向量数据库
• 备份知识库文档
• 备份模型文件
8.3.3 灾难恢复
• 制定灾难恢复计划
• 定期进行灾难恢复演练
• 确保RTO < 1小时，RPO < 15分钟
9. 安全设计
9.1 数据安全
9.1.1 数据加密
• 传输加密：使用HTTPS/TLS
• 存储加密：敏感数据加密存储
• 模型加密：模型文件加密保护
9.1.2 数据脱敏
• 日志中脱敏用户信息
• 响应中脱敏敏感数据
• 知识库文档脱敏处理
9.2 访问控制
9.2.1 身份认证
• 实现JWT认证
• 支持OAuth 2.0
• 支持API Key认证
9.2.2 权限控制
• 基于角色的访问控制（RBAC）
• 细粒度权限管理
• 审计日志记录
9.3 内容安全
9.3.1 输入验证
• 验证用户输入格式
• 过滤恶意内容
• 防止注入攻击
9.3.2 输出过滤
• 过滤不当内容
• 检测敏感信息
• 实现内容审核
10. 架构决策记录
ADR-001: 选择Ollama作为本地AI推理引擎
状态：已接受
背景：
需要选择一个本地AI推理引擎，支持离线运行、保护数据隐私、降低成本。
决策：
选择Ollama作为本地AI推理引擎。
理由：
1. 支持多种开源模型，包括Llama、Mistral、Qwen等
2. 轻量级部署，资源占用低
3. 支持GPU加速，性能优秀
4. API简单易用，集成方便
5. 活跃的社区支持
后果：
• 正面：离线运行、数据隐私保护、成本降低
• 负面：需要本地GPU资源，模型更新需要手动管理
ADR-002: 选择ChromaDB作为向量数据库
状态：已接受
背景：
需要一个向量数据库来存储和检索知识文档，支持RAG功能。
决策：
选择ChromaDB作为向量数据库。
理由：
1. 轻量级部署，易于集成
2. 支持多种嵌入模型
3. 提供丰富的查询接口
4. 支持元数据过滤
5. 开源免费，社区活跃
后果：
• 正面：部署简单、功能完善、性能良好
• 负面：大规模数据场景下性能可能不如专业向量数据库
ADR-003: 选择Hono作为Web框架
状态：已接受
背景：
需要一个轻量级、高性能的Web框架来构建AI服务网关。
决策：
选择Hono作为Web框架。
理由：
1. 轻量级，启动快，内存占用低
2. 原生TypeScript支持，类型安全
3. 优秀的性能，接近原生Node.js
4. 丰富的中间件生态
5. 易于测试和维护
后果：
• 正面：性能优秀、开发体验好、类型安全
• 负面：生态相对Express较小，学习成本
ADR-004: 实现流式响应
状态：已接受
背景：
AI生成内容需要较长时间，用户等待体验不佳。
决策：
实现Server-Sent Events (SSE)流式响应。
理由：
1. 减少用户等待时间，提升体验
2. 实时展示生成内容，增强交互感
3. SSE实现简单，兼容性好
4. 支持断线重连
后果：
• 正面：用户体验提升、实时反馈
• 负面：实现复杂度增加，需要处理流式数据
ADR-005: 实现RAG知识增强
状态：已接受
背景：
纯AI模型可能产生不准确或幻觉内容，需要知识库增强。
决策：
实现RAG（检索增强生成）知识增强。
理由：
1. 提升回答准确性和专业性
2. 减少AI幻觉
3. 支持引用来源，增强可信度
4. 可定制知识库，适应不同场景
后果：
• 正面：回答质量提升、可信度增强
• 负面：增加系统复杂度，需要维护知识库
11. 未来规划
11.1 短期规划（1-3个月）
[ ] 完善错误处理和重试机制
[ ] 实现速率限制和防滥用
[ ] 优化模型加载和切换性能
[ ] 增强知识库管理和检索能力
[ ] 实现多模态支持（图像、语音）
11.2 中期规划（3-6个月）
[ ] 实现模型微调功能
[ ] 支持分布式部署和负载均衡
[ ] 实现A/B测试框架
[ ] 增强监控和告警能力
[ ] 实现知识图谱集成
11.3 长期规划（6-12个月）
[ ] 支持联邦学习
[ ] 实现自动模型选择和优化
[ ] 支持边缘计算部署
[ ] 实现智能知识推荐
[ ] 支持多语言和跨文化适配
12. 附录
12.1 术语表
术语
英文
说明

RAG
Retrieval-Augmented Generation
检索增强生成

SSE
Server-Sent Events
服务器推送事件

GPU
Graphics Processing Unit
图形处理器

OOM
Out of Memory
内存溢出

RBAC
Role-Based Access Control
基于角色的访问控制

JWT
JSON Web Token
JSON网络令牌

RTO
Recovery Time Objective
恢复时间目标

RPO
Recovery Point Objective
恢复点目标

12.2 参考资源
• Ollama官方文档：https://ollama.ai/docs
• ChromaDB官方文档：https://docs.trychroma.com
• Hono官方文档：https://hono.dev
• RAG论文：https://arxiv.org/abs/2005.11401
12.3 版本历史
版本
日期
作者
变更说明

v1.0.0
2024-06-24
AI小语开发团队
初始版本

---
文档状态：draft
审核状态：待审核
下次审核日期：2024-07-24

---

> 「***YanYuCloudCube***」
> 「***<admin@0379.email>***」
> 「***Words Initiate Quadrants, Language Serves as Core for the Future***」
> 「***All things converge in the cloud pivot; Deep stacks ignite a new era of intelligence***」
