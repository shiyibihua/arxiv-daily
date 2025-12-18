---
layout: default
title: LM-Searcher: Cross-domain Neural Architecture Search with LLMs via Unified Numerical Encoding
---

# LM-Searcher: Cross-domain Neural Architecture Search with LLMs via Unified Numerical Encoding

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.05657" class="toolbar-btn" target="_blank">📄 arXiv: 2509.05657v3</a>
  <a href="https://arxiv.org/pdf/2509.05657.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.05657v3" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.05657v3', 'LM-Searcher: Cross-domain Neural Architecture Search with LLMs via Unified Numerical Encoding')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yuxuan Hu, Jihao Liu, Ke Wang, Jinliang Zhen, Weikang Shi, Manyuan Zhang, Qi Dou, Rui Liu, Aojun Zhou, Hongsheng Li

**分类**: cs.CL, cs.AI

**发布日期**: 2025-09-06 (更新: 2025-09-25)

**备注**: EMNLP 2025 Main

**🔗 代码/项目**: [GITHUB](https://github.com/Ashone3/LM-Searcher)

---

## 💡 一句话要点

**LM-Searcher：利用LLM和统一数值编码实现跨领域神经架构搜索**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `神经架构搜索` `大型语言模型` `跨领域学习` `数值编码` `指令调优`

## 📋 核心要点

1. 现有基于LLM的NAS方法依赖于提示工程和领域特定调整，限制了其在不同任务中的实用性和可扩展性。
2. LM-Searcher通过NCode统一数值编码，将NAS问题转化为排序任务，并利用指令调优训练LLM选择高性能架构。
3. 实验表明，LM-Searcher在图像分类、分割和生成等任务中表现出色，验证了其跨领域泛化能力。

## 📝 摘要（中文）

本文提出了一种名为LM-Searcher的新框架，该框架利用大型语言模型（LLM）进行跨领域神经架构优化，无需大量的领域特定调整。该方法的核心是NCode，一种用于神经架构的通用数值字符串表示，它实现了跨领域的架构编码和搜索。此外，本文将神经架构搜索（NAS）问题重新定义为一个排序任务，通过使用基于剪枝的子空间采样策略生成的指令调优样本，训练LLM从候选池中选择高性能的架构。本文构建了一个包含广泛架构-性能对的数据集，以促进鲁棒和可迁移的学习。综合实验表明，LM-Searcher在领域内（例如，用于图像分类的CNN）和领域外（例如，用于分割和生成的LoRA配置）任务中均取得了具有竞争力的性能，为基于LLM的灵活和可泛化的架构搜索建立了一种新的范例。

## 🔬 方法详解

**问题定义**：现有的基于LLM的神经架构搜索方法通常需要大量的prompt工程和领域特定的调优，这限制了它们在不同任务和领域中的泛化能力。因此，需要一种能够跨领域进行神经架构搜索，并且不需要大量领域特定知识的方法。

**核心思路**：LM-Searcher的核心思路是将神经架构搜索问题转化为一个排序问题，并利用大型语言模型（LLM）来学习架构的性能排序。通过一种通用的数值编码方式（NCode）来表示不同的神经架构，使得LLM能够理解和比较不同架构的优劣。同时，利用指令调优的方式来训练LLM，使其能够根据给定的任务和数据集，选择出高性能的架构。

**技术框架**：LM-Searcher的整体框架主要包含以下几个模块：1）**NCode编码器**：将不同的神经架构编码成统一的数值字符串表示。2）**子空间采样器**：基于剪枝策略，从整个架构空间中采样出具有代表性的子空间。3）**指令调优数据集生成器**：根据采样出的子空间，生成包含架构-性能对的指令调优数据集。4）**LLM排序器**：利用指令调优数据集训练LLM，使其能够对不同的架构进行排序。5）**架构搜索器**：利用训练好的LLM，从候选架构池中选择出高性能的架构。

**关键创新**：LM-Searcher的关键创新在于以下几点：1）**NCode通用数值编码**：提出了一种通用的数值编码方式，能够表示不同类型的神经架构，实现了跨领域的架构表示。2）**基于剪枝的子空间采样**：提出了一种基于剪枝策略的子空间采样方法，能够有效地减少搜索空间，提高搜索效率。3）**指令调优的LLM排序器**：利用指令调优的方式训练LLM，使其能够更好地理解和学习架构的性能排序。

**关键设计**：NCode编码的关键设计在于将架构的各个组件（如卷积层、池化层、激活函数等）映射到数值空间，并使用字符串的形式进行表示。子空间采样器使用L1范数剪枝来选择重要的连接，从而减少搜索空间。指令调优数据集包含架构的NCode表示、任务描述和性能指标。LLM排序器使用交叉熵损失函数进行训练，目标是预测架构的性能排名。

## 📊 实验亮点

实验结果表明，LM-Searcher在图像分类任务上取得了与传统NAS方法相当的性能，并且在LoRA配置搜索任务上，相比于随机搜索和贝叶斯优化等基线方法，取得了显著的性能提升。例如，在图像分割任务上，LM-Searcher搜索到的LoRA配置相比于随机搜索，IoU提升了5%以上。这些结果验证了LM-Searcher的有效性和跨领域泛化能力。

## 🎯 应用场景

LM-Searcher具有广泛的应用前景，可应用于图像分类、目标检测、语义分割、自然语言处理等多个领域。它能够自动化地搜索高性能的神经架构，降低了人工设计架构的成本和难度。此外，LM-Searcher的跨领域泛化能力使其能够应用于新的任务和领域，加速了AI技术的创新和发展。未来，该方法有望应用于自动驾驶、医疗诊断等领域。

## 📄 摘要（原文）

> Recent progress in Large Language Models (LLMs) has opened new avenues for solving complex optimization problems, including Neural Architecture Search (NAS). However, existing LLM-driven NAS approaches rely heavily on prompt engineering and domain-specific tuning, limiting their practicality and scalability across diverse tasks. In this work, we propose LM-Searcher, a novel framework that leverages LLMs for cross-domain neural architecture optimization without the need for extensive domain-specific adaptation. Central to our approach is NCode, a universal numerical string representation for neural architectures, which enables cross-domain architecture encoding and search. We also reformulate the NAS problem as a ranking task, training LLMs to select high-performing architectures from candidate pools using instruction-tuning samples derived from a novel pruning-based subspace sampling strategy. Our curated dataset, encompassing a wide range of architecture-performance pairs, encourages robust and transferable learning. Comprehensive experiments demonstrate that LM-Searcher achieves competitive performance in both in-domain (e.g., CNNs for image classification) and out-of-domain (e.g., LoRA configurations for segmentation and generation) tasks, establishing a new paradigm for flexible and generalizable LLM-based architecture search. The datasets and models will be released at https://github.com/Ashone3/LM-Searcher.

