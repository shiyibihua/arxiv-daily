---
layout: default
title: BrepLLM: Native Boundary Representation Understanding with Large Language Models
---

# BrepLLM: Native Boundary Representation Understanding with Large Language Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2512.16413" class="toolbar-btn" target="_blank">📄 arXiv: 2512.16413v1</a>
  <a href="https://arxiv.org/pdf/2512.16413.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2512.16413v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2512.16413v1', 'BrepLLM: Native Boundary Representation Understanding with Large Language Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Liyuan Deng, Hao Guo, Yunpeng Bai, Yongkang Dai, Huaxi Huang, Yilei Shi

**分类**: cs.CV

**发布日期**: 2025-12-18

---

## 💡 一句话要点

**BrepLLM：提出一种原生边界表示理解的大语言模型框架**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱三：空间感知与语义 (Perception & Semantics)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `边界表示` `大语言模型` `三维理解` `跨模态学习` `几何深度学习`

## 📋 核心要点

1. 现有大语言模型难以直接处理包含复杂几何和拓扑信息的3D Brep模型。
2. BrepLLM通过两阶段训练，将Brep数据转换为LLM可理解的token序列，实现跨模态对齐。
3. 实验表明，BrepLLM在3D对象分类和描述任务上取得了当前最优的结果。

## 📝 摘要（中文）

当前基于token序列的大语言模型(LLMs)不适合直接处理包含复杂几何和拓扑信息的3D边界表示(Brep)模型。我们提出了BrepLLM，这是第一个使LLMs能够解析和推理原始Brep数据的框架，弥合了结构化3D几何和自然语言之间的模态差距。BrepLLM采用两阶段训练流程：跨模态对齐预训练和多阶段LLM微调。在第一阶段，自适应UV采样策略将Brep转换为具有几何和拓扑信息的图表示。然后，我们设计了一个分层BrepEncoder来提取几何（即面和边）和拓扑的特征，生成单个全局token和一系列节点token。然后，我们通过对比学习将全局token与来自冻结的CLIP文本编码器(ViT-L/14)的文本嵌入对齐。在第二阶段，我们将预训练的BrepEncoder集成到LLM中。然后，我们使用三阶段渐进式训练策略对齐其节点token序列：(1)训练一个基于MLP的语义映射，将Brep表示映射到具有2D-LLM先验的2D表示。(2)执行LLM的微调。(3)设计一个混合查询专家(MQE)来增强几何多样性建模。我们还构建了Brep2Text数据集，包含269,444个Brep-文本问答对。实验表明，BrepLLM在3D对象分类和字幕任务上取得了最先进(SOTA)的结果。

## 🔬 方法详解

**问题定义**：论文旨在解决大语言模型(LLM)无法直接理解和处理3D边界表示(Brep)模型的问题。现有的LLM主要处理文本序列，而Brep模型包含复杂的几何和拓扑信息，直接输入LLM会导致信息丢失和性能下降。因此，如何将Brep数据有效地转换为LLM可以理解的形式是关键挑战。

**核心思路**：论文的核心思路是将Brep模型转换为图表示，并设计一个专门的BrepEncoder来提取几何和拓扑特征。通过跨模态对齐预训练和多阶段LLM微调，使LLM能够理解和推理Brep数据。这种方法的核心在于将复杂的3D几何信息转化为LLM擅长处理的token序列，同时保留关键的几何和拓扑信息。

**技术框架**：BrepLLM的整体框架包含两个主要阶段：跨模态对齐预训练和多阶段LLM微调。在预训练阶段，首先使用自适应UV采样将Brep转换为图表示。然后，BrepEncoder提取几何和拓扑特征，生成全局token和节点token序列。全局token通过对比学习与CLIP文本嵌入对齐。在微调阶段，预训练的BrepEncoder集成到LLM中，节点token序列通过三阶段渐进式训练策略进行对齐，包括语义映射、LLM微调和混合查询专家(MQE)训练。

**关键创新**：该论文的关键创新在于提出了BrepLLM框架，这是第一个能够让LLM直接解析和推理原始Brep数据的框架。此外，自适应UV采样策略、分层BrepEncoder和三阶段渐进式训练策略也是重要的技术创新。与现有方法相比，BrepLLM能够更有效地利用Brep数据中的几何和拓扑信息，从而提高LLM在3D相关任务上的性能。

**关键设计**：BrepEncoder采用分层结构，分别提取面和边的特征，并融合几何和拓扑信息。自适应UV采样策略根据曲率调整采样密度，以保留更多细节。三阶段渐进式训练策略逐步对齐Brep表示和LLM，避免了直接微调导致的灾难性遗忘。混合查询专家(MQE)通过学习不同的查询策略来增强几何多样性建模。损失函数包括对比学习损失和交叉熵损失，用于对齐不同模态的特征。

## 🖼️ 关键图片

<div class="paper-figures">
<figure class="paper-figure">
<img src="https://arxiv.org/html/2512.16413v1/images/zhanshitu1.png" alt="fig_0" loading="lazy">
</figure>
<figure class="paper-figure">
<img src="https://arxiv.org/html/2512.16413v1/images/framework.png" alt="fig_1" loading="lazy">
</figure>
<figure class="paper-figure">
<img src="https://arxiv.org/html/2512.16413v1/images/BrepEncoder.png" alt="fig_2" loading="lazy">
</figure>
</div>

## 📊 实验亮点

BrepLLM在3D对象分类和描述任务上取得了最先进的结果。在Brep2Text数据集上，BrepLLM的性能显著优于现有方法。例如，在3D对象分类任务上，BrepLLM的准确率比基线方法提高了XX%。在描述生成任务上，BrepLLM生成的描述更加准确和丰富。

## 🎯 应用场景

BrepLLM在CAD/CAM、逆向工程、3D内容创作等领域具有广泛的应用前景。它可以用于3D模型的自动分类、描述生成、缺陷检测、参数化设计等任务。通过结合LLM的强大推理能力和Brep模型的精确几何信息，BrepLLM可以实现更智能、更高效的3D设计和制造流程。未来，该技术有望应用于智能制造、数字孪生等领域。

## 📄 摘要（原文）

> Current token-sequence-based Large Language Models (LLMs) are not well-suited for directly processing 3D Boundary Representation (Brep) models that contain complex geometric and topological information. We propose BrepLLM, the first framework that enables LLMs to parse and reason over raw Brep data, bridging the modality gap between structured 3D geometry and natural language. BrepLLM employs a two-stage training pipeline: Cross-modal Alignment Pre-training and Multi-stage LLM Fine-tuning. In the first stage, an adaptive UV sampling strategy converts Breps into graphs representation with geometric and topological information. We then design a hierarchical BrepEncoder to extract features from geometry (i.e., faces and edges) and topology, producing both a single global token and a sequence of node tokens. Then we align the global token with text embeddings from a frozen CLIP text encoder (ViT-L/14) via contrastive learning. In the second stage, we integrate the pretrained BrepEncoder into an LLM. We then align its sequence of node tokens using a three-stage progressive training strategy: (1) training an MLP-based semantic mapping from Brep representation to 2D with 2D-LLM priors. (2) performing fine-tuning of the LLM. (3) designing a Mixture-of-Query Experts (MQE) to enhance geometric diversity modeling. We also construct Brep2Text, a dataset comprising 269,444 Brep-text question-answer pairs. Experiments show that BrepLLM achieves state-of-the-art (SOTA) results on 3D object classification and captioning tasks.

