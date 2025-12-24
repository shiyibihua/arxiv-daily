---
layout: default
title: Spatial Traces: Enhancing VLA Models with Spatial-Temporal Understanding
---

# Spatial Traces: Enhancing VLA Models with Spatial-Temporal Understanding

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.09032" class="toolbar-btn" target="_blank">📄 arXiv: 2508.09032v1</a>
  <a href="https://arxiv.org/pdf/2508.09032.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.09032v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.09032v1', 'Spatial Traces: Enhancing VLA Models with Spatial-Temporal Understanding')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Maxim A. Patratskiy, Alexey K. Kovalev, Aleksandr I. Panov

**分类**: cs.CV, cs.AI, cs.RO

**发布日期**: 2025-08-12

**🔗 代码/项目**: [PROJECT_PAGE](https://ampiromax.github.io/ST-VLA)

---

## 💡 一句话要点

**提出空间轨迹方法以增强VLA模型的时空理解能力**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `视觉-语言-行动` `时空理解` `深度学习` `多模态融合` `机器人导航` `自动驾驶` `虚拟现实`

## 📋 核心要点

1. 现有的VLA模型在空间和时间理解方面的提升多为独立进行，缺乏有效的整合方法。
2. 本文提出通过视觉提示将关键点的视觉轨迹投影到深度图上，从而同时捕捉空间和时间信息。
3. 在SimplerEnv实验中，模型成功解决的任务数量显著提升，且对训练数据的需求较低，具有实际应用价值。

## 📝 摘要（中文）

视觉-语言-行动（VLA）模型在根据视觉观察和文本指令预测代理在虚拟环境及现实场景中的运动方面表现出色。尽管近期研究分别增强了空间和时间理解，本文提出了一种通过视觉提示整合两者的新方法。我们引入了一种将观察中的关键点视觉轨迹投影到深度图上的方法，使模型能够同时捕捉空间和时间信息。实验结果表明，在SimplerEnv中，成功解决的任务平均数量相比SpatialVLA提高了4%，相比TraceVLA提高了19%。此外，我们展示了该增强可以在最小训练数据下实现，特别适用于数据收集困难的现实应用场景。

## 🔬 方法详解

**问题定义**：本文旨在解决现有VLA模型在空间和时间理解方面的独立性问题，导致模型在复杂环境中的表现受限。

**核心思路**：通过将视觉轨迹与深度图结合，模型能够同时获取空间和时间信息，从而提升理解能力和任务执行效果。

**技术框架**：整体架构包括视觉轨迹提取模块、深度图投影模块和任务执行模块，确保信息的有效整合与利用。

**关键创新**：最重要的创新在于视觉轨迹的投影方法，使得模型能够在同一时间内处理空间和时间数据，区别于以往的单一处理方式。

**关键设计**：在参数设置上，采用了适应性损失函数以平衡空间与时间信息的权重，同时优化了网络结构以提高模型的学习效率。

## 📊 实验亮点

实验结果显示，本文提出的方法在SimplerEnv中成功解决的任务数量相比SpatialVLA提升了4%，相比TraceVLA提升了19%。这一提升在最小训练数据下实现，展示了方法的高效性和实用性。

## 🎯 应用场景

该研究的潜在应用领域包括机器人导航、自动驾驶、虚拟现实等场景，能够有效提升智能系统在复杂环境中的决策能力和执行效率。未来，随着数据收集技术的进步，该方法有望在更多实际应用中得到推广，推动智能系统的进一步发展。

## 📄 摘要（原文）

> Vision-Language-Action models have demonstrated remarkable capabilities in predicting agent movements within virtual environments and real-world scenarios based on visual observations and textual instructions. Although recent research has focused on enhancing spatial and temporal understanding independently, this paper presents a novel approach that integrates both aspects through visual prompting. We introduce a method that projects visual traces of key points from observations onto depth maps, enabling models to capture both spatial and temporal information simultaneously. The experiments in SimplerEnv show that the mean number of tasks successfully solved increased for 4% compared to SpatialVLA and 19% compared to TraceVLA. Furthermore, we show that this enhancement can be achieved with minimal training data, making it particularly valuable for real-world applications where data collection is challenging. The project page is available at https://ampiromax.github.io/ST-VLA.

