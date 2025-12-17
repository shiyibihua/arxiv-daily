---
layout: default
title: Endless World: Real-Time 3D-Aware Long Video Generation
---

# Endless World: Real-Time 3D-Aware Long Video Generation

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2512.12430" target="_blank" class="toolbar-btn">arXiv: 2512.12430v1</a>
    <a href="https://arxiv.org/pdf/2512.12430.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2512.12430v1" 
            onclick="toggleFavorite(this, '2512.12430v1', 'Endless World: Real-Time 3D-Aware Long Video Generation')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Ke Zhang, Yiqun Mei, Jiacong Xu, Vishal M. Patel

**分类**: cs.CV

**发布日期**: 2025-12-13

**备注**: 10 pages,7 figures

**🔗 代码/项目**: [PROJECT_PAGE](https://bwgzk-keke.github.io/EndlessWorld/)

---

## 💡 一句话要点

**Endless World：实时3D感知无限长视频生成框架**

🎯 **匹配领域**: **支柱七：动作重定向 (Motion Retargeting)**

**关键词**: `长视频生成` `3D感知` `实时渲染` `自回归模型` `几何一致性`

## 📋 核心要点

1. 现有方法难以生成具有稳定3D结构的长时程连贯视频，尤其是在流式场景下。
2. Endless World采用条件自回归训练策略，对齐新生成内容与已有帧，保持长程依赖并提升计算效率。
3. 该框架集成全局3D感知注意力，通过3D注入机制保证物理合理性和几何一致性，生成稳定视频。

## 📝 摘要（中文）

本文提出Endless World，一个用于无限、3D一致视频生成的实时框架。为了支持无限视频生成，引入了一种条件自回归训练策略，该策略将新生成的内容与现有视频帧对齐。这种设计保留了长程依赖性，同时保持了计算效率，从而可以在单个GPU上实现实时推理，而无需额外的训练开销。此外，Endless World集成了全局3D感知注意力，以提供跨时间的连续几何引导。我们的3D注入机制在整个扩展序列中强制执行物理合理性和几何一致性，解决了长时程和动态场景合成中的关键挑战。大量实验表明，Endless World生成了长、稳定且视觉连贯的视频，在视觉保真度和空间一致性方面均达到了与现有方法相比具有竞争力的或更优越的性能。

## 🔬 方法详解

**问题定义**：现有长视频生成方法难以保证生成视频的3D结构一致性和长时间连贯性，尤其是在需要实时生成的场景下，计算资源消耗大，难以实现。现有方法在处理动态场景和维持几何一致性方面存在挑战。

**核心思路**：Endless World的核心思路是利用条件自回归训练策略和全局3D感知注意力机制，实现无限长度、3D一致的视频生成。通过将新生成的内容与现有视频帧对齐，保持长程依赖性，并利用3D信息引导视频生成，保证物理合理性和几何一致性。

**技术框架**：Endless World框架包含以下主要模块：1) 条件自回归生成器：负责生成新的视频帧，并与现有帧对齐。2) 全局3D感知注意力模块：用于提取和利用场景的3D信息，提供几何引导。3) 3D注入机制：将3D信息注入到生成过程中，强制执行物理合理性和几何一致性。整个流程是自回归的，即每次生成一帧或几帧，然后将新生成的帧添加到已有视频序列中，作为下一步生成的条件。

**关键创新**：该方法最重要的创新点在于将条件自回归训练策略与全局3D感知注意力机制相结合，实现了实时、无限长度、3D一致的视频生成。与现有方法相比，该方法能够在保证视频质量的同时，显著提高生成效率，并更好地维持视频的几何一致性。

**关键设计**：条件自回归生成器可能采用Transformer或类似架构，损失函数可能包含重构损失、对抗损失以及用于保证3D一致性的损失项。全局3D感知注意力模块可能利用深度估计或其他3D重建技术获取场景的3D信息，并将其编码为注意力权重，引导视频生成。3D注入机制的具体实现方式未知，可能通过修改生成器的输入或中间层特征来实现。

## 📊 实验亮点

实验结果表明，Endless World在生成长时程、稳定且视觉连贯的视频方面表现出色，在视觉保真度和空间一致性方面均达到了与现有方法相比具有竞争力的或更优越的性能。具体性能数据未知，但摘要强调了其在视觉质量和空间一致性上的优势。

## 🎯 应用场景

Endless World具有广泛的应用前景，包括虚拟现实、游戏开发、电影制作、以及实时内容创作等领域。该技术可以用于生成无限的虚拟环境，创建逼真的游戏场景，或者为电影制作提供高效的内容生成工具。此外，该技术还可以应用于远程呈现、虚拟会议等场景，提供更加沉浸式的用户体验。

## 📄 摘要（原文）

> Producing long, coherent video sequences with stable 3D structure remains a major challenge, particularly in streaming scenarios. Motivated by this, we introduce Endless World, a real-time framework for infinite, 3D-consistent video generation.To support infinite video generation, we introduce a conditional autoregressive training strategy that aligns newly generated content with existing video frames. This design preserves long-range dependencies while remaining computationally efficient, enabling real-time inference on a single GPU without additional training overhead.Moreover, our Endless World integrates global 3D-aware attention to provide continuous geometric guidance across time. Our 3D injection mechanism enforces physical plausibility and geometric consistency throughout extended sequences, addressing key challenges in long-horizon and dynamic scene synthesis.Extensive experiments demonstrate that Endless World produces long, stable, and visually coherent videos, achieving competitive or superior performance to existing methods in both visual fidelity and spatial consistency. Our project has been available on https://bwgzk-keke.github.io/EndlessWorld/.

