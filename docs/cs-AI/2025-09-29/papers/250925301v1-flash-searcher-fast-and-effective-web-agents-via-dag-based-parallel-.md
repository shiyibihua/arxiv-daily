---
layout: default
title: Flash-Searcher: Fast and Effective Web Agents via DAG-Based Parallel Execution
---

# Flash-Searcher: Fast and Effective Web Agents via DAG-Based Parallel Execution

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.25301" class="toolbar-btn" target="_blank">📄 arXiv: 2509.25301v1</a>
  <a href="https://arxiv.org/pdf/2509.25301.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.25301v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.25301v1', 'Flash-Searcher: Fast and Effective Web Agents via DAG-Based Parallel Execution')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Tianrui Qin, Qianben Chen, Sinuo Wang, He Xing, King Zhu, He Zhu, Dingfeng Shi, Xinxin Liu, Ge Zhang, Jiaheng Liu, Yuchen Eleanor Jiang, Xitong Gao, Wangchunshu Zhou

**分类**: cs.AI, cs.CL

**发布日期**: 2025-09-29

---

## 💡 一句话要点

**Flash-Searcher：基于DAG并行执行的快速高效Web Agent**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `大型语言模型` `Agent` `并行计算` `有向无环图` `任务分解` `动态优化` `Web搜索` `智能自动化`

## 📋 核心要点

1. 现有Agent框架主要依赖顺序处理，在需要大量工具交互的复杂推理任务中效率低下。
2. Flash-Searcher将任务分解为具有依赖关系的子任务，构建DAG图，实现并行推理和动态优化。
3. 实验表明，Flash-Searcher在多个基准测试中显著优于现有方法，并能有效减少Agent执行步骤。

## 📝 摘要（中文）

大型语言模型（LLMs）在配备外部工具时，已展示出在复杂推理任务中卓越的能力。然而，当前的框架主要依赖于顺序处理，导致执行效率低下，尤其是在需要大量工具交互的任务中。本文介绍了一种新颖的并行Agent推理框架Flash-Searcher，它从根本上将执行范式从顺序链重塑为有向无环图（DAG）。Flash-Searcher将复杂的任务分解为具有显式依赖关系的子任务，从而能够并发执行独立的推理路径，同时保持逻辑约束。通过动态工作流优化，我们的框架基于中间结果不断优化执行图，有效地集成了摘要模块。在多个基准测试中的全面评估表明，Flash-Searcher始终优于现有方法。具体而言，它在BrowseComp上实现了67.7%的准确率，在xbench-DeepSearch上实现了83%的准确率，同时与当前框架相比，Agent执行步骤减少了高达35%。此外，当将这种并行推理管道提炼到单个模型中时，我们观察到各种骨干架构的性能显着提高，突显了我们方法论的通用性。因此，我们的工作代表了Agent架构设计的一个重大进步，为复杂的推理任务提供了一种更具可扩展性和效率的范例。

## 🔬 方法详解

**问题定义**：现有基于LLM的Agent框架在处理复杂任务时，通常采用顺序执行的方式，即一个步骤执行完毕后才能执行下一个步骤。这种方式在需要大量工具交互的任务中效率低下，因为很多子任务之间可能并不存在依赖关系，可以并行执行。因此，如何提高Agent在复杂任务中的执行效率是一个关键问题。

**核心思路**：Flash-Searcher的核心思路是将复杂的任务分解为多个子任务，并显式地定义这些子任务之间的依赖关系，从而构建一个有向无环图（DAG）。通过DAG，Agent可以并行执行那些没有依赖关系的子任务，从而提高整体的执行效率。此外，Flash-Searcher还引入了动态工作流优化机制，根据中间结果不断优化执行图，进一步提升效率。

**技术框架**：Flash-Searcher的整体架构包括任务分解模块、依赖关系建模模块、DAG构建模块、并行执行引擎和动态优化模块。任务分解模块负责将复杂任务分解为多个子任务；依赖关系建模模块负责确定子任务之间的依赖关系；DAG构建模块根据子任务和依赖关系构建DAG；并行执行引擎负责按照DAG的拓扑顺序并行执行子任务；动态优化模块根据中间结果调整DAG的结构，例如合并或删除某些子任务。

**关键创新**：Flash-Searcher最重要的创新点在于将Agent的执行范式从传统的顺序链式结构转变为基于DAG的并行执行结构。这种转变使得Agent能够充分利用计算资源，并行执行独立的推理路径，从而显著提高执行效率。此外，动态工作流优化机制也是一个重要的创新，它使得Agent能够根据实际情况调整执行策略，进一步提升性能。

**关键设计**：Flash-Searcher的关键设计包括：1) 如何有效地将复杂任务分解为子任务，并保证子任务的完整性和独立性；2) 如何准确地建模子任务之间的依赖关系，避免出现逻辑错误；3) 如何设计高效的并行执行引擎，充分利用计算资源；4) 如何设计有效的动态优化策略，根据中间结果调整DAG的结构。具体的参数设置、损失函数和网络结构等技术细节在论文中可能有所涉及，但摘要中未明确提及。

## 📊 实验亮点

Flash-Searcher在BrowseComp和xbench-DeepSearch两个基准测试中分别取得了67.7%和83%的准确率，显著优于现有方法。更重要的是，Flash-Searcher能够将Agent的执行步骤减少高达35%，表明其在效率方面具有显著优势。此外，将Flash-Searcher的并行推理管道提炼到单个模型中，也能观察到性能的显著提升，证明了该方法具有良好的泛化能力。

## 🎯 应用场景

Flash-Searcher具有广泛的应用前景，例如智能客服、自动化报告生成、复杂数据分析等。通过将复杂任务分解为可并行执行的子任务，Flash-Searcher可以显著提高Agent的执行效率，降低人工干预的需求，从而提高生产力。未来，Flash-Searcher有望成为构建高效智能Agent的重要基石。

## 📄 摘要（原文）

> Large language models (LLMs) have demonstrated remarkable capabilities in complex reasoning tasks when equipped with external tools. However, current frameworks predominantly rely on sequential processing, leading to inefficient execution particularly for tasks requiring extensive tool interaction. This paper introduces Flash-Searcher, a novel parallel agent reasoning framework that fundamentally reimagines the execution paradigm from sequential chains to directed acyclic graphs (DAGs). Flash-Searcher decomposes complex tasks into subtasks with explicit dependencies, enabling concurrent execution of independent reasoning paths while maintaining logical constraints. Through dynamic workflow optimization, our framework continuously refines the execution graph based on intermediate results, effectively integrating summary module. Comprehensive evaluations across multiple benchmarks demonstrate that Flash-Searcher consistently outperforms existing approaches. Specifically, it achieves 67.7% accuracy on BrowseComp and 83% on xbench-DeepSearch, while reducing agent execution steps by up to 35% compared to current frameworks. Furthermore, when distilling this parallel reasoning pipeline into single models, we observe substantial performance gains across diverse backbone architectures, underscoring the generalizability of our methodology. Our work thus represents a significant advance in agent architecture design, offering a more scalable and efficient paradigm for complex reasoning tasks.

