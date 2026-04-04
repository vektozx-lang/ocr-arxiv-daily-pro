# OCR / 文档解析研究日报（2026-03-13）

## 报告说明

- 检索源：arXiv API
- 检索查询：`(all:"document parsing" OR all:"document understanding" OR all:"optical character recognition" OR all:OCR OR all:"layout analysis" OR all:"document layout analysis" OR all:"text recognition" OR all:"table recognition" OR all:"form understanding" OR all:"document intelligence" OR all:"page understanding" OR all:"scene text recognition" OR all:"handwritten text recognition" OR all:"information extraction") AND (cat:cs.CV OR cat:cs.AI OR cat:cs.CL OR cat:eess.IV)`
- 生成时间（UTC）：`2026-03-13 03:41:27`
- 大模型综合分析：`开启`

## 一、今日执行摘要

> 今日论文聚焦于OCR与文档解析的效率提升、领域专用化、评估方法改进及低资源支持。核心趋势包括：紧凑多模态模型（如GLM-OCR）通过架构优化和解码机制提高效率；金融等垂直领域系统（如Agentar-Fin-OCR）针对特定挑战设计跨页整合和基准；评估框架（如ZeroSense）解耦压缩质量与下游任务性能；低资源语言（如僧伽罗语）通过OCR数字化构建语料库；多模态查询框架（如One Supervisor）通过工具协调提升部署经济性。这些进展共同推动文档解析向更高效、精准和可扩展方向发展。

## 二、今日趋势判断

研究呈现四大趋势：1) 模型效率优化：通过紧凑架构（GLM-OCR）、多令牌预测和知识蒸馏（波兰语模型）平衡性能与资源消耗；2) 领域专用化：金融文档解析引入跨页整合和专用基准（Agentar-Fin-OCR），医疗文档评估开源LLMs（日语病理报告）；3) 评估方法创新：提出解耦框架（ZeroSense）以纯化视觉文本压缩评估，避免下游任务混淆；4) 低资源与多模态扩展：支持低资源语言语料构建（SiDiaC-v.2.0）、自监督领域适应（OSMDA）和多模态工具协调（One Supervisor）以减少标注依赖并提升泛化能力。

## 三、今日论文概览

1. **GLM-OCR Technical Report** | 标签：紧凑多模态模型、文档理解、解码优化、系统流程设计
2. **Agentar-Fin-OCR** | 标签：金融文档解析、跨页结构整合、表格识别、领域特定基准
3. **DocSage: An Information Structuring Agent for Multi-Doc Multi-Entity Question Answering** | 标签：多文档问答、动态模式发现、结构化提取、关系推理
4. **SiDiaC-v.2.0: Sinhala Diachronic Corpus Version 2.0** | 标签：低资源语言语料库、OCR数字化、文本后处理、历时语言研究
5. **OSM-based Domain Adaptation for Remote Sensing VLMs** | 标签：遥感视觉语言模型、自监督领域适应、OCR生成标注、OpenStreetMap集成
6. **ZeroSense:How Vision matters in Long Context Compression** | 标签：视觉文本压缩评估、解耦评估框架、ZeroSense基准、长上下文建模
7. **Long-Context Encoder Models for Polish Language Understanding** | 标签：长上下文编码器、波兰语NLP、知识蒸馏、文档理解、多任务评估
8. **Preliminary analysis of RGB-NIR Image Registration techniques for off-road forestry environments** | 标签：RGB-NIR配准、越野林业、深度学习评估、多尺度配准、传感器融合
9. **Performance Evaluation of Open-Source Large Language Models for Assisting Pathology Report Writing in Japanese** | 标签：日语病理报告、开源LLMs评估、医疗文档处理、错误纠正、主观评估
10. **One Supervisor, Many Modalities: Adaptive Tool Orchestration for Autonomous Queries** | 标签：多模态查询处理、工具协调、自适应路由、OCR集成、部署经济性

## 四、今天 OCR / 文档解析论文里的主要创新点

- 采用紧凑多模态架构结合视觉编码器和语言解码器以提高计算效率。
- 引入专用基准或评估框架（如FinDocBench、ZeroSense）以针对领域或任务进行更准确评估。
- 通过跨页内容整合或动态模式发现处理长文档或复杂结构中的不连续性问题。
- 利用知识蒸馏、课程学习或自适应路由策略优化模型训练或部署过程。
- 集成OCR能力进行文档数字化或标注生成以支持低资源场景或领域适应。

## 五、后续 OCR 领域值得推进的改进方向

- 开发针对低资源语言（如僧伽罗语）的OCR后处理算法以减少数字化错误并扩展多语言支持。
- 优化跨页整合算法以处理金融、法律等领域文档中更复杂的布局变化和页面间不连续性。
- 增强视觉文本压缩评估框架（如ZeroSense）以覆盖更多文档类型（如表格、公式）并量化文本保存度。
- 探索轻量级监督器设计或边缘部署方案，使多模态查询处理框架（如One Supervisor）适应资源受限环境。
- 改进基础VLM的OCR模块精度，以提升自监督领域适应（如OSMDA）在遥感等场景中的标注生成质量。

## 六、工程落地启发

- GLM-OCR的紧凑架构和多令牌预测机制适合边缘部署，可降低解码延迟并保持识别性能。
- Agentar-Fin-OCR的跨页整合和表格解析模块可直接应用于金融文档处理系统，提高结构化输出精度。
- One Supervisor框架的自适应工具协调能显著减少多模态查询处理时间和成本，适用于文档解析流水线优化。
- 波兰语长上下文编码器模型通过知识蒸馏提供压缩变体，可高效处理长文档任务并降低部署开销。
- OSMDA的自包含领域适应方法减少了对标注数据的依赖，适合大规模遥感或其他垂直领域的模型微调。

## 七、优先关注论文

- **GLM-OCR Technical Report**：紧凑多模态模型设计结合高效解码机制，在文档解析任务中实现性能与资源平衡，适合生产系统集成。
- **Agentar-Fin-OCR**：针对金融文档的跨页结构整合和专用基准，为垂直领域解析提供实用解决方案，具有高工程价值。
- **One Supervisor, Many Modalities: Adaptive Tool Orchestration for Autonomous Queries**：智能多模态工具协调框架显著提升处理效率和成本效益，对OCR集成和文档解析部署有直接影响。
- **OSM-based Domain Adaptation for Remote Sensing VLMs**：自监督领域适应方法利用OCR生成标注，降低标注成本，可扩展至其他文档解析场景以减少数据依赖。
- **ZeroSense:How Vision matters in Long Context Compression**：解耦评估框架提供更可靠的视觉文本压缩质量评估，有助于优化OCR相关压缩技术的研究和工程实践。

## 八、论文逐篇解析

### 1. GLM-OCR Technical Report

- arXiv: [2603.10910v1](https://arxiv.org/abs/2603.10910v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.10910v1)
- 作者: Shuaiqi Duan, Yadong Xue, Weihan Wang, Zhe Su, Huan Liu, Sheng Yang, Guobing Gan, Guo Wang, Zihan Wang, Shengdong Yan, Dexin Jin, Yuxuan Zhang, Guohong Wen, Yanfeng Wang, Yutao Zhang, Xiaohan Zhang, Wenyi Hong, Yukuo Cen, Da Yin, Bin Chen, Wenmeng Yu, Xiaotao Gu, Jie Tang
- 发布时间: 2026-03-11T15:55:47Z
- 分类: cs.CL
- 相关性评分: 28
- 主题标签: 紧凑多模态模型、文档理解、解码优化、系统流程设计

**中文摘要**

> GLM-OCR是一个高效的0.9B参数紧凑多模态模型，专为真实世界文档理解设计。它结合了0.4B参数的CogViT视觉编码器和0.5B参数的GLM语言解码器，在计算效率和识别性能之间取得了良好平衡。针对确定性OCR任务中标准自回归解码的低效问题，GLM-OCR引入了多令牌预测机制，每步预测多个令牌，显著提高解码吞吐量，同时通过共享参数保持低内存开销。系统层面采用两阶段流程：PP-DocLayout-V3先进行布局分析，然后并行执行区域级识别。在公共基准和工业场景的广泛评估表明，GLM-OCR在文档解析、文本和公式转录、表格结构恢复及关键信息提取方面达到竞争性或最先进性能。其紧凑架构和结构化生成使其适合资源受限的边缘部署和大规模生产系统。

**核心创新概述**

> 提出一个紧凑的多模态OCR模型，通过多令牌预测机制优化解码效率，并采用两阶段系统流程平衡性能与资源消耗。

**创新点拆解**

- 结合CogViT视觉编码器和GLM语言解码器的紧凑架构设计
- 引入多令牌预测机制以提高解码吞吐量
- 采用两阶段系统流程（布局分析后并行区域识别）
- 针对确定性OCR任务优化自回归解码过程

**当前局限**

> 未明确提及对低资源语言或极端布局文档的适应性，可能依赖预训练视觉编码器的性能上限。

**后续可改进方向**

- 扩展多语言支持，特别是低资源语言
- 增强对非标准布局或手写文档的鲁棒性
- 探索更高效的视觉编码器压缩技术
- 优化两阶段流程的延迟和错误传播问题

**工程启发**

> 高，紧凑模型适合边缘部署，结构化生成有利于生产系统集成，在文档解析和表格恢复等任务中表现竞争性。

**为什么值得关注**

> 直接针对OCR任务提出高效模型和系统设计，涉及文档理解、布局分析和文本识别等核心OCR技术。

**原始摘要**

GLM-OCR is an efficient 0.9B-parameter compact multimodal model designed for real-world document
understanding. It combines a 0.4B-parameter CogViT visual encoder with a 0.5B-parameter GLM language
decoder, achieving a strong balance between computational efficiency and recognition performance. To
address the inefficiency of standard autoregressive decoding in deterministic OCR tasks, GLM-OCR
introduces a Multi-Token Prediction (MTP) mechanism that predicts multiple tokens per step,
significantly improving decoding throughput while keeping memory overhead low through shared
parameters. At the system level, a two-stage pipeline is adopted: PP-DocLayout-V3 first performs
layout analysis, followed by parallel region-level recognition. Extensive evaluations on public
benchmarks and industrial scenarios show that GLM-OCR achieves competitive or state-of-the-art
performance in document parsing, text and formula transcription, table structure recovery, and key
information extraction. Its compact architecture and structured generation make it suitable for both
resource-constrained edge deployment and large-scale production systems.

---

### 2. Agentar-Fin-OCR

- arXiv: [2603.11044v1](https://arxiv.org/abs/2603.11044v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.11044v1)
- 作者: Siyi Qian, Xiongfei Bai, Bingtao Fu, Yichen Lu, Gaoyang Zhang, Xudong Yang, Peng Zhang
- 发布时间: 2026-03-11T17:59:42Z
- 分类: cs.CV
- 相关性评分: 27
- 主题标签: 金融文档解析、跨页结构整合、表格识别、领域特定基准

**中文摘要**

> 本文提出Agentar-Fin-OCR，一个专为金融领域文档设计的文档解析系统，将超长金融PDF转换为语义一致、高精度、结构化的输出，并具有审计级溯源能力。针对金融特定挑战（如复杂布局、跨页结构不连续性和单元格级引用能力），系统结合：（1）跨页内容整合算法以恢复页面间连续性，以及文档级标题层次重建模块以构建全局一致的内容目录树，支持结构感知检索；（2）针对表格解析的难度自适应课程学习训练策略，以及CellBBoxRegressor模块，使用结构锚令牌从解码器隐藏状态定位表格单元格，无需外部检测器。实验表明模型在OmniDocBench的表格解析指标上表现优异。为在金融垂直领域实现现实评估，进一步引入FinDocBench基准，包含六个金融文档类别，具有专家验证的标注和评估指标（如基于编辑距离的内容目录相似性、跨页拼接TEDS和表格单元格交并比）。在FinDocBench上评估多种最先进模型以评估其能力和剩余限制。总体而言，Agentar-Fin-OCR和FinDocBench为可靠金融文档处理提供了实用基础。

**核心创新概述**

> 针对金融文档的特定挑战，提出跨页结构整合和难度自适应训练方法，并引入专业基准进行现实评估。

**创新点拆解**

- 跨页内容整合算法和文档级标题层次重建模块
- 难度自适应课程学习训练策略用于表格解析
- CellBBoxRegressor模块从解码器隐藏状态定位单元格
- 引入FinDocBench基准，包含金融特定评估指标

**当前局限**

> 可能依赖金融文档的特定结构假设，泛化到其他领域文档（如科学论文或法律文件）时性能可能下降。

**后续可改进方向**

- 扩展系统到其他垂直领域（如医疗或法律文档）
- 增强对非结构化或手写金融文档的处理能力
- 优化跨页整合算法以处理更复杂的布局变化
- 降低对专家标注数据的依赖，探索半监督方法

**工程启发**

> 高，专门针对金融文档优化，结构化输出和审计级溯源能力符合行业需求，基准提供标准化评估。

**为什么值得关注**

> 涉及OCR在金融文档解析中的应用，包括表格识别、跨页结构处理和基准构建，是文档理解的重要方向。

**原始摘要**

In this paper, we propose Agentar-Fin-OCR, a document parsing system tailored to financial-domain
documents, transforming ultra-long financial PDFs into semantically consistent, highly accurate,
structured outputs with auditing-grade provenance. To address finance-specific challenges such as
complex layouts, cross-page structural discontinuities, and cell-level referencing capability,
Agentar-Fin-OCR combines (1) a Cross-page Contents Consolidation algorithm to restore continuity
across pages and a Document-level Heading Hierarchy Reconstruction (DHR) module to build a globally
consistent Table of Contents (TOC) tree for structure-aware retrieval, and (2) a difficulty-adaptive
curriculum learning training strategy for table parsing, together with a CellBBoxRegressor module
that uses structural anchor tokens to localize table cells from decoder hidden states without
external detectors. Experiments demonstrate that our model shows high performance on the table
parsing metrics of OmniDocBench. To enable realistic evaluation in the financial vertical, we
further introduce FinDocBench, a benchmark that includes six financial document categories with
expert-verified annotations and evaluation metrics including Table of Contents edit-distance-based
similarity (TocEDS), cross-page concatenated TEDS, and Table Cell Intersection over Union (C-IoU).
We evaluate a wide range of state-of-the-art models on FinDocBench to assess their capabilities and
remaining limitations on financial documents. Overall, Agentar-Fin-OCR and FinDocBench provide a
practical foundation for reliable downstream financial document applications.

---

### 3. DocSage: An Information Structuring Agent for Multi-Doc Multi-Entity Question Answering

- arXiv: [2603.11798v1](https://arxiv.org/abs/2603.11798v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.11798v1)
- 作者: Teng Lin, Yizhang Zhu, Zhengxuan Zhang, Yuyu Luo, Nan Tang
- 发布时间: 2026-03-12T11:00:09Z
- 分类: cs.AI
- 相关性评分: 13
- 主题标签: 多文档问答、动态模式发现、结构化提取、关系推理

**中文摘要**

> 多文档多实体问答任务要求模型跟踪分散文档中多个实体间的隐式逻辑。然而，现有大型语言模型和检索增强生成框架存在关键限制：标准RAG基于向量相似性的粗粒度检索常遗漏关键事实，基于图的RAG无法高效整合碎片化复杂关系网络，且两者缺乏模式意识，导致跨文档证据链构建不足和实体关系推导不准确。为解决这些挑战，提出DocSage，一个端到端代理框架，集成动态模式发现、结构化信息提取和具有错误保证的模式感知关系推理。DocSage通过三个核心模块操作：（1）模式发现模块动态推断查询特定的最小可连接模式以捕获基本实体和关系；（2）提取模块将非结构化文本转换为语义一致的关系表，通过错误感知校正机制增强以减少提取错误；（3）推理模块在结构化表上执行多跳关系推理，利用模式意识高效对齐跨文档实体并聚合证据。此代理设计提供三个关键优势：通过SQL驱动索引实现精确事实定位，通过关系表自然支持跨文档实体连接，以及通过结构化推理减轻LLM注意力扩散。

**核心创新概述**

> 提出一个代理框架，集成动态模式发现和结构化提取，以优化多文档多实体问答中的证据链构建和关系推理。

**创新点拆解**

- 动态模式发现模块捕获查询特定实体和关系
- 结构化信息提取模块转换为关系表并集成错误校正
- 模式感知关系推理模块对齐跨文档实体
- 代理框架设计结合SQL索引和结构化推理

**当前局限**

> 可能依赖高质量的模式发现和提取，对低质量或高度非结构化文档的鲁棒性未明确评估。

**后续可改进方向**

- 增强模式发现模块对噪声或模糊文档的适应性
- 优化提取模块以减少对预定义模式的依赖
- 扩展框架到多语言或多模态文档场景
- 降低计算复杂度以支持实时应用

**工程启发**

> 中等，框架在复杂问答任务中提供结构化推理优势，但可能依赖大量计算资源，适合高精度需求场景。

**为什么值得关注**

> 涉及文档解析后的信息提取和推理，是OCR下游应用（如问答系统）的关键技术，强调结构化处理和跨文档整合。

**原始摘要**

Multi-document Multi-entity Question Answering inherently demands models to track implicit logic
between multiple entities across scattered documents. However, existing Large Language Models (LLMs)
and Retrieval-Augmented Generation (RAG) frameworks suffer from critical limitations: standard RAG's
vector similarity-based coarse-grained retrieval often omits critical facts, graph-based RAG fails
to efficiently integrate fragmented complex relationship networks, and both lack schema awareness,
leading to inadequate cross-document evidence chain construction and inaccurate entity relationship
deduction. To address these challenges, we propose DocSage, an end-to-end agentic framework that
integrates dynamic schema discovery, structured information extraction, and schema-aware relational
reasoning with error guarantees. DocSage operates through three core modules: (1) A schema discovery
module dynamically infers query-specific minimal joinable schemas to capture essential entities and
relationships; (2) An extraction module transforms unstructured text into semantically coherent
relational tables, enhanced by error-aware correction mechanisms to reduce extraction errors; (3) A
reasoning module performs multi-hop relational reasoning over structured tables, leveraging schema
awareness to efficiently align cross-document entities and aggregate evidence. This agentic design
offers three key advantages: precise fact localization via SQL-powered indexing, natural support for
cross-document entity joins through relational tables, and mitigated LLM attention diffusion via
structured representation. Evaluations on two MDMEQA benchmarks demonstrate that DocSage
significantly outperforms state-of-the-art long-context LLMs and RAG systems, achieving more than
27% accuracy improvements respectively.

---

### 4. SiDiaC-v.2.0: Sinhala Diachronic Corpus Version 2.0

- arXiv: [2603.10861v1](https://arxiv.org/abs/2603.10861v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.10861v1)
- 作者: Nevidu Jayatilleke, Nisansa de Silva, Uthpala Nimanthi, Gagani Kulathilaka, Azra Safrullah, Johan Sofalas
- 发布时间: 2026-03-11T15:10:32Z
- 分类: cs.CL
- 相关性评分: 13
- 主题标签: 低资源语言语料库、OCR数字化、文本后处理、历时语言研究

**中文摘要**

> SiDiaC-v.2.0是迄今为止最大的综合性僧伽罗语历时语料库，覆盖出版日期从公元1800年到1955年，书写日期历史跨度从公元5世纪到20世纪。语料库包含185部文学作品中的244k单词，经过彻底过滤、预处理和版权合规检查，以及广泛的后处理。此外，基于书写日期标注了59个文档子集，总计70k单词。文本选自斯里兰卡国家图书馆的SiDiaC-v.1.0未过滤列表，使用Google Document AI OCR进行数字化，随后进行后处理以纠正格式问题、处理代码混合、包含特殊令牌和修复畸形令牌。SiDiaC-v.2.0的构建借鉴了其他语料库（如FarPaHC、SiDiaC-v.1.0和CCOHA）的实践，特别是在句法标注和文本规范化策略方面，考虑到法罗语的低资源语言状态与CCOHA中使用的类似清理策略。语料库根据体裁分为两层：主要分类是二元的，将每本书分配为非虚构或虚构；次要分类更详细，将文本分组到特定体裁（如宗教、历史、诗歌、语言和医学）。尽管面临资源有限的挑战，SiDiaC-v.2.0作为僧伽罗语NLP的综合资源，支持历时语言研究。

**核心创新概述**

> 构建一个大规模僧伽罗语历时语料库，结合OCR数字化和后处理，支持低资源语言的NLP研究。

**创新点拆解**

- 大规模僧伽罗语历时语料库覆盖多个世纪
- 使用Google Document AI OCR进行数字化并集成后处理
- 基于体裁的双层分类系统
- 借鉴其他低资源语料库的清理和标注策略

**当前局限**

> 语料库规模相对较小（244k单词），可能限制深度学习模型的训练效果；依赖特定OCR工具，可能引入数字化错误。

**后续可改进方向**

- 扩展语料库规模，包括更多文档和更广泛的时间跨度
- 改进OCR后处理以减少数字化错误
- 探索多语言对齐或跨语言迁移学习以增强低资源支持
- 增加更多标注层（如句法或语义角色）

**工程启发**

> 中等，为僧伽罗语NLP提供基础数据资源，但直接工程应用有限，更适合学术研究或模型预训练。

**为什么值得关注**

> 涉及OCR在低资源语言文档数字化中的应用，以及语料库构建对文档解析和数据预处理的重要性。

**原始摘要**

SiDiaC-v.2.0 is the largest comprehensive Sinhala Diachronic Corpus to date, covering a period from
1800 CE to 1955 CE in terms of publication dates, and a historical span from the 5th to the 20th
century CE in terms of written dates. The corpus consists of 244k words across 185 literary works
that underwent thorough filtering, preprocessing, and copyright compliance checks, followed by
extensive post-processing. Additionally, a subset of 59 documents totalling 70k words was annotated
based on their written dates. Texts from the National Library of Sri Lanka were selected from the
SiDiaC-v.1.0 non-filtered list, which was digitised using Google Document AI OCR. This was followed
by post-processing to correct formatting issues, address code-mixing, include special tokens, and
fix malformed tokens. The construction of SiDiaC-v.2.0 was informed by practices from other corpora,
such as FarPaHC, SiDiaC-v.1.0, and CCOHA. This was particularly relevant for syntactic annotation
and text normalisation strategies, given the shared characteristics of low-resource language status
between Faroese and the similar cleaning strategies utilised in CCOHA. This corpus is categorised
into two layers based on genres: primary and secondary. The primary categorisation is binary,
assigning each book to either Non-Fiction or Fiction. The secondary categorisation is more detailed,
grouping texts under specific genres such as Religious, History, Poetry, Language, and Medical.
Despite facing challenges due to limited resources, SiDiaC-v.2.0 serves as a comprehensive resource
for Sinhala NLP, building upon the work previously done in SiDiaC-v.1.0.

---

### 5. OSM-based Domain Adaptation for Remote Sensing VLMs

- arXiv: [2603.11804v1](https://arxiv.org/abs/2603.11804v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.11804v1)
- 作者: Stefan Maria Ailuro, Mario Markov, Mohammad Mahdi, Delyan Boychev, Luc Van Gool, Danda Pani Paudel
- 发布时间: 2026-03-12T11:08:30Z
- 分类: cs.CV, cs.LG
- 相关性评分: 10
- 主题标签: 遥感视觉语言模型、自监督领域适应、OCR生成标注、OpenStreetMap集成

**中文摘要**

> 适应遥感领域的视觉语言模型严重依赖领域特定的图像文本监督，但卫星和航空影像的高质量标注仍然稀缺且昂贵。主流伪标注流程通过从大型前沿模型蒸馏知识来弥补这一差距，但这种对大型教师的依赖成本高、限制可扩展性，并将可达到性能上限限制在教师模型。提出OSMDA：一个自包含的领域适应框架，消除这种依赖。关键见解是，一个有能力的基础VLM可以作为自己的标注引擎：通过将航空影像与渲染的OpenStreetMap图块配对，利用模型的OCR和图表理解能力生成由OSM大量辅助元数据丰富的标题。然后模型仅在卫星影像上对结果语料进行微调，产生OSMDA-VLM，一个领域适应的VLM，无需手动标注或更强外部模型。在10个基准上进行广泛评估，涵盖图像文本到文本任务，并与9个竞争基线比较。当与真实数据等量混合时，方法达到最先进结果，同时训练成本远低于教师依赖的替代方案。这些结果表明，给定一个强大的基础模型，与众包地理数据对齐是遥感领域适应的实用且可扩展路径。数据集和模型权重将公开提供。

**核心创新概述**

> 提出一个自包含的领域适应框架，利用基础VLM的OCR能力从OpenStreetMap生成标注，避免依赖外部教师模型。

**创新点拆解**

- 自包含领域适应框架，消除对大型教师模型的依赖
- 利用基础VLM的OCR和图表理解能力生成标注
- 结合OpenStreetMap元数据丰富标题生成
- 在卫星影像上微调，无需手动标注

**当前局限**

> 可能依赖基础VLM的OCR性能，如果基础模型在遥感图像上表现不佳，生成标注质量可能受限。

**后续可改进方向**

- 优化基础VLM的OCR模块以提高遥感文本识别精度
- 扩展框架到其他地理数据源或多模态任务
- 减少对OpenStreetMap数据完整性的依赖
- 探索增量学习以持续适应新数据

**工程启发**

> 高，降低标注成本，提高可扩展性，适用于遥感应用中的大规模模型部署。

**为什么值得关注**

> 涉及OCR在遥感图像文本识别中的应用，以及领域适应方法，对文档解析中的多模态模型有借鉴意义。

**原始摘要**

Vision-Language Models (VLMs) adapted to remote sensing rely heavily on domain-specific image-text
supervision, yet high-quality annotations for satellite and aerial imagery remain scarce and
expensive to produce. Prevailing pseudo-labeling pipelines address this gap by distilling knowledge
from large frontier models, but this dependence on large teachers is costly, limits scalability, and
caps achievable performance at the ceiling of the teacher. We propose OSMDA: a self-contained domain
adaptation framework that eliminates this dependency. Our key insight is that a capable base VLM can
serve as its own annotation engine: by pairing aerial images with rendered OpenStreetMap (OSM)
tiles, we leverage optical character recognition and chart comprehension capabilities of the model
to generate captions enriched by OSM's vast auxiliary metadata. The model is then fine-tuned on the
resulting corpus with satellite imagery alone, yielding OSMDA-VLM, a domain-adapted VLM that
requires no manual labeling and no stronger external model. We conduct exhaustive evaluations
spanning 10 benchmarks across image-text-to-text tasks and comparing against 9 competitive
baselines. When equally mixed with real data, our method achieves state-of-the-art results, while
being substantially cheaper to train than teacher-dependent alternatives. These results suggest
that, given a strong foundation model, alignment with crowd-sourced geographic data is a practical
and scalable path towards remote sensing domain adaptation. Dataset and model weights will be made
publicly available.

---

### 6. ZeroSense:How Vision matters in Long Context Compression

- arXiv: [2603.11846v1](https://arxiv.org/abs/2603.11846v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.11846v1)
- 作者: Yonghan Gao, Zehong Chen, Lijian Xu, Jingzhi Chen, Jingwei Guan, Xingyu Zeng
- 发布时间: 2026-03-12T12:11:48Z
- 分类: cs.CV
- 相关性评分: 9
- 主题标签: 视觉文本压缩评估、解耦评估框架、ZeroSense基准、长上下文建模

**中文摘要**

> 最近的视觉文本压缩方法（以DeepSeek-OCR为代表）通过利用文本到图像渲染，在长上下文建模任务中报告了令人印象深刻的高令牌压缩比。然而，现有评估协议严重依赖下游任务性能。此类评估指标由于多模态大语言模型的强固有语言先验，无法准确测量文本保存。在这项工作中，引入一个新的评估框架，解耦MLLMs的能力以忠实评估VTC质量。在此框架内，进一步引入ZeroSense基准以确保测试样本的低语义相关性。通过消除上下文依赖，基准保证评估结果纯粹反映VTC质量，不受下游模型语义推理能力的影响。在多个数据集上的广泛实验表明，VTC质量和下游任务准确性显著分歧，突显解耦评估框架的必要性。

**核心创新概述**

> 提出一个解耦评估框架和ZeroSense基准，以更准确地评估视觉文本压缩方法的质量，避免下游任务性能的混淆。

**创新点拆解**

- 解耦评估框架分离VTC质量和下游任务性能
- 引入ZeroSense基准确保低语义相关性测试样本
- 通过消除上下文依赖纯化评估指标
- 实验验证VTC质量与下游准确性之间的分歧

**当前局限**

> 基准可能无法完全覆盖所有实际应用场景，评估框架的通用性需要进一步验证。

**后续可改进方向**

- 扩展ZeroSense基准以包括更多样化的文档类型和压缩场景
- 优化评估指标以更好地量化文本保存度
- 探索框架在多模态或多语言压缩任务中的应用
- 降低基准构建成本，提高可重复性

**工程启发**

> 中等，提供更可靠的评估工具，有助于优化压缩方法，但直接工程应用有限，更适合研究社区。

**为什么值得关注**

> 涉及OCR相关压缩技术的评估方法，对文档解析中的长上下文处理和模型优化有参考价值。

**原始摘要**

Recent visual-text compression (VTC) methods, typified by DeepSeek-OCR, report impressive high token
compression ratios for long-context modeling tasks by leveraging text-to-image rendering. However,
existing evaluation protocols heavily rely on downstream task performance. Such evaluation metrics
fail to accurately measure text preservation due to the strong inherent linguistic priors of
Multimodal Large Language Models (MLLMs). In this work, we introduce a new evaluation framework that
decouples MLLMs' capabilities to faithfully assess VTC quality. Within this framework, we further
introduce the ZeroSense Benchmark to ensure low semantic correlation of testing samples. By
eliminating contextual dependencies, our benchmark guarantees that the evaluation results are purely
reflective of VTC quality, unaffected by the semantic inference capabilities of downstream models.
Extensive experiments across multiple datasets demonstrate that VTC quality and downstream task
accuracy diverge significantly, highlighting the necessity of our decoupled evaluation framework.

---

### 7. Long-Context Encoder Models for Polish Language Understanding

- arXiv: [2603.12191v1](https://arxiv.org/abs/2603.12191v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.12191v1)
- 作者: Sławomir Dadas, Rafał Poświata, Marek Kozłowski, Małgorzata Grębowiec, Michał Perełkiewicz, Paweł Klimiuk, Przemysław Boruta
- 发布时间: 2026-03-12T17:21:45Z
- 分类: cs.CL
- 相关性评分: 7
- 主题标签: 长上下文编码器、波兰语NLP、知识蒸馏、文档理解、多任务评估

**中文摘要**

> 尽管仅解码器的大型语言模型（LLMs）近期主导了NLP领域，但仅编码器架构在判别任务中仍是成本效益高且参数效率高的标准方案。然而，经典编码器如BERT受限于短上下文窗口，不足以处理长文档。本文针对波兰语解决了这一限制，引入了一个能够处理长达8192个标记序列的高质量波兰语模型。该模型通过采用两阶段训练程序开发，包括位置嵌入适应和全参数连续预训练。此外，我们提出了通过知识蒸馏训练的压缩模型变体。模型在25个任务上进行了评估，包括KLEJ基准、新引入的金融任务套件（FinBench）以及其他分类和回归任务，特别是那些需要长文档理解的任务。结果表明，我们的模型在波兰语和多语言模型中实现了最佳平均性能，在长上下文任务中显著优于竞争解决方案，同时在短文本上保持可比质量。

**核心创新概述**

> 本文针对波兰语长文档理解任务，开发了首个能够处理8192个标记的长上下文编码器模型，通过两阶段训练和知识蒸馏技术，在多个基准测试中实现了领先性能。

**创新点拆解**

- 针对波兰语的长上下文编码器模型设计，支持8192个标记序列处理
- 两阶段训练方法：位置嵌入适应和全参数连续预训练
- 通过知识蒸馏开发压缩模型变体，提高参数效率
- 在KLEJ基准、FinBench金融任务套件等25个任务上进行综合评估

**当前局限**

> 模型主要针对波兰语，可能在其他语言上泛化能力有限；压缩模型变体可能在某些任务上性能略有下降；未详细讨论模型在极端长文档（如超过8192个标记）上的表现。

**后续可改进方向**

- 扩展模型支持更多语言的长上下文处理
- 优化压缩技术以减少性能损失
- 研究动态上下文窗口扩展方法
- 探索模型在跨语言任务中的迁移学习能力

**工程启发**

> 高，为波兰语NLP应用提供了高效的长文档处理解决方案，适用于金融、法律等需要长文本理解的领域，压缩模型变体有助于降低部署成本。

**为什么值得关注**

> 与OCR/文档解析相关，因为长上下文编码器模型可用于处理长文档（如扫描文档的文本提取后内容），提升文档理解任务的性能，特别是在多语言和金融文档场景中。

**原始摘要**

While decoder-only Large Language Models (LLMs) have recently dominated the NLP landscape, encoder-
only architectures remain a cost-effective and parameter-efficient standard for discriminative
tasks. However, classic encoders like BERT are limited by a short context window, which is
insufficient for processing long documents. In this paper, we address this limitation for the Polish
by introducing a high-quality Polish model capable of processing sequences of up to 8192 tokens. The
model was developed by employing a two-stage training procedure that involves positional embedding
adaptation and full parameter continuous pre-training. Furthermore, we propose compressed model
variants trained via knowledge distillation. The models were evaluated on 25 tasks, including the
KLEJ benchmark, a newly introduced financial task suite (FinBench), and other classification and
regression tasks, specifically those requiring long-document understanding. The results demonstrate
that our model achieves the best average performance among Polish and multilingual models,
significantly outperforming competitive solutions in long-context tasks while maintaining comparable
quality on short texts.

---

### 8. Preliminary analysis of RGB-NIR Image Registration techniques for off-road forestry environments

- arXiv: [2603.11952v1](https://arxiv.org/abs/2603.11952v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.11952v1)
- 作者: Pankaj Deoli, Karthik Ranganath, Karsten Berns
- 发布时间: 2026-03-12T14:00:20Z
- 分类: cs.CV
- 相关性评分: 6
- 主题标签: RGB-NIR配准、越野林业、深度学习评估、多尺度配准、传感器融合

**中文摘要**

> RGB-NIR图像配准在传感器融合、图像增强和越野自主性中扮演重要角色。在这项工作中，我们评估了基于经典和深度学习（DL）的图像配准技术，以评估它们在越野林业应用中的适用性。NeMAR在6种不同配置下训练，表现出部分成功，但其GAN损失不稳定性表明在保持几何一致性方面存在挑战。MURF在越野林业数据上测试时，在共享信息提取过程中显示出有前景的大尺度特征对齐，但在密集植被中的精细细节上存在困难。尽管这只是初步评估，但我们的研究需要进一步改进，以实现越野森林应用的鲁棒、多尺度配准。

**核心创新概述**

> 本文首次系统评估了经典和深度学习图像配准技术在越野林业环境中的性能，揭示了NeMAR和MURF等方法在特定场景下的优势和局限性，为多传感器融合应用提供了初步见解。

**创新点拆解**

- 针对越野林业环境的RGB-NIR图像配准技术评估框架
- 对NeMAR和MURF等深度学习模型在6种配置下的性能分析
- 识别GAN损失不稳定性和几何一致性挑战
- 强调多尺度配准在密集植被场景中的需求

**当前局限**

> 评估为初步性质，缺乏大规模数据集支持；模型在精细细节配准上表现不足；未涉及实时或动态环境下的配准性能；技术泛化到其他越野场景的能力未验证。

**后续可改进方向**

- 开发针对越野环境的专用配准数据集
- 优化深度学习模型以提升几何一致性和精细细节处理
- 研究自适应多尺度配准算法
- 探索实时配准技术在自主系统中的应用

**工程启发**

> 中等，为越野林业的传感器融合和图像增强提供了技术评估基础，但需进一步改进才能实现鲁棒部署，适用于自动驾驶、环境监测等领域。

**为什么值得关注**

> 与OCR/文档解析相关，因为图像配准技术可用于对齐多模态文档（如RGB和近红外扫描图像），提升文档图像预处理和质量，支持后续文本提取任务。

**原始摘要**

RGB-NIR image registration plays an important role in sensor-fusion, image enhancement and off-road
autonomy. In this work, we evaluate both classical and Deep Learning (DL) based image registration
techniques to access their suitability for off-road forestry applications. NeMAR, trained under 6
different configurations, demonstrates partial success however, its GAN loss instability suggests
challenges in preserving geometric consistency. MURF, when tested on off-road forestry data shows
promising large scale feature alignment during shared information extraction but struggles with fine
details in dense vegetation. Even though this is just a preliminary evaluation, our study
necessitates further refinements for robust, multi-scale registration for off-road forest
applications.

---

### 9. Performance Evaluation of Open-Source Large Language Models for Assisting Pathology Report Writing in Japanese

- arXiv: [2603.11597v1](https://arxiv.org/abs/2603.11597v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.11597v1)
- 作者: Masataka Kawai, Singo Sakashita, Shumpei Ishikawa, Shogo Watanabe, Anna Matsuoka, Mikio Sakurai, Yasuto Fujimoto, Yoshiyuki Takahara, Atsushi Ohara, Hirohiko Miyake, Genichiro Ishii
- 发布时间: 2026-03-12T06:40:04Z
- 分类: cs.CL, cs.AI
- 相关性评分: 6
- 主题标签: 日语病理报告、开源LLMs评估、医疗文档处理、错误纠正、主观评估

**中文摘要**

> 大型语言模型（LLMs）在支持日语病理报告撰写方面的性能尚未被探索。我们从三个角度评估了七个开源LLMs：（A）按照预定义格式生成和提取病理诊断文本，（B）纠正日语病理报告中的打字错误，以及（C）由病理学家和临床医生对模型生成的解释性文本进行主观评估。思维模型和医学专用模型在需要推理的结构化报告任务和打字错误纠正方面显示出优势。相比之下，评估者对解释性输出的偏好差异很大。尽管LLMs的效用因任务而异，但我们的研究结果表明，开源LLMs可以在有限但临床相关的场景中有助于日语病理报告撰写。

**核心创新概述**

> 本文首次系统评估了开源LLMs在日语病理报告撰写任务中的性能，涵盖文本生成、错误纠正和主观评估，揭示了思维模型和医学专用模型在结构化任务中的优势。

**创新点拆解**

- 针对日语病理报告撰写的LLMs评估框架，包括生成、纠错和主观评估
- 比较思维模型和医学专用模型在结构化任务中的性能
- 引入临床专家主观评估以衡量模型输出实用性
- 识别任务依赖性效用差异

**当前局限**

> 评估基于有限数据集，可能未覆盖所有临床场景；解释性文本的主观评估结果不一致；模型在复杂医学推理任务上的能力有限；未涉及多语言或跨领域泛化。

**后续可改进方向**

- 扩展评估到更大规模、多样化的病理报告数据集
- 开发针对医学领域的微调或适配技术
- 研究多模态LLMs在病理图像和文本结合中的应用
- 优化模型以提高解释性输出的一致性和临床接受度

**工程启发**

> 高，为日语医疗文档处理提供了实用见解，开源LLMs可辅助病理报告自动化，减少人工负担，适用于医疗信息系统和临床支持工具。

**为什么值得关注**

> 与OCR/文档解析直接相关，因为病理报告是典型的结构化文档，LLMs评估涉及文本生成、纠错和格式遵循，这些任务可迁移到OCR后处理、文档内容提取和错误校正中。

**原始摘要**

The performance of large language models (LLMs) for supporting pathology report writing in Japanese
remains unexplored. We evaluated seven open-source LLMs from three perspectives: (A) generation and
information extraction of pathology diagnosis text following predefined formats, (B) correction of
typographical errors in Japanese pathology reports, and (C) subjective evaluation of model-generated
explanatory text by pathologists and clinicians. Thinking models and medical-specialized models
showed advantages in structured reporting tasks that required reasoning and in typo correction. In
contrast, preferences for explanatory outputs varied substantially across raters. Although the
utility of LLMs differed by task, our findings suggest that open-source LLMs can be useful for
assisting Japanese pathology report writing in limited but clinically relevant scenarios.

---

### 10. One Supervisor, Many Modalities: Adaptive Tool Orchestration for Autonomous Queries

- arXiv: [2603.11545v1](https://arxiv.org/abs/2603.11545v1)
- PDF: [下载链接](https://arxiv.org/pdf/2603.11545v1)
- 作者: Mayank Saini Arit Kumar Bishwas
- 发布时间: 2026-03-12T05:02:58Z
- 分类: cs.CL, cs.AI, cs.LG
- 相关性评分: 6
- 主题标签: 多模态查询处理、工具协调、自适应路由、OCR集成、部署经济性

**中文摘要**

> 我们提出了一个用于自主多模态查询处理的智能AI框架，该框架协调跨文本、图像、音频、视频和文档模态的专用工具。一个中央监督器动态分解用户查询，将子任务委托给模态适当的工具（例如，对象检测、OCR、语音转录），并通过自适应路由策略而非预定义决策树合成结果。对于纯文本查询，框架使用通过RouteLLM学习到的路由，而非文本路径则使用SLM辅助的模态分解。在15个任务类别的2847个查询上评估，我们的框架相比匹配的层次基线，实现了72%的准确答案时间减少、85%的对话返工减少和67%的成本减少，同时保持准确率持平。这些结果表明，智能集中编排从根本上改善了多模态AI部署的经济性。

**核心创新概述**

> 本文提出了一种新型智能多模态查询处理框架，通过中央监督器和自适应路由策略动态协调OCR、对象检测等工具，显著提升了处理效率和成本效益，突破了传统层次基线的限制。

**创新点拆解**

- 中央监督器架构，动态分解查询并委托给模态专用工具（如OCR）
- 自适应路由策略：RouteLLM用于文本查询，SLM辅助模态分解用于非文本路径
- 在2847个查询上评估，实现时间、返工和成本的大幅减少
- 强调智能编排对多模态AI部署经济性的改进

**当前局限**

> 框架依赖于预训练工具的性能，可能受工具精度限制；评估任务类别可能未覆盖所有现实场景；自适应路由的泛化能力需进一步验证；未详细讨论框架在边缘设备上的部署可行性。

**后续可改进方向**

- 集成更先进的OCR和模态处理工具以提升整体精度
- 扩展评估到更广泛的多模态任务和数据集
- 研究轻量级监督器设计以支持资源受限环境
- 探索框架在实时交互系统中的应用优化

**工程启发**

> 很高，框架通过智能编排显著提升多模态处理效率，降低成本，适用于文档解析、多媒体内容分析等场景，具有实际部署潜力。

**为什么值得关注**

> 与OCR/文档解析高度相关，因为框架明确将OCR作为关键工具之一，用于处理文档模态查询，其自适应路由和协调机制可优化OCR任务集成，提升多模态文档处理系统的整体性能。

**原始摘要**

We present an agentic AI framework for autonomous multimodal query processing that coordinates
specialized tools across text, image, audio, video, and document modalities. A central Supervisor
dynamically decomposes user queries, delegates subtasks to modality-appropriate tools (e.g., object
detection, OCR, speech transcription), and synthesizes results through adaptive routing strategies
rather than predetermined decision trees. For text-only queries, the framework uses learned routing
via RouteLLM, while non-text paths use SLM-assisted modality decomposition. Evaluated on 2,847
queries across 15 task categories, our framework achieves 72% reduction in time-to-accurate-answer,
85% reduction in conversational rework, and 67% cost reduction compared to the matched hierarchical
baseline while maintaining accuracy parity. These results demonstrate that intelligent centralized
orchestration fundamentally improves multimodal AI deployment economics.

---
