---
title: LLM-oj Neniam Povas Fari (Komplikan) Matematikon
description: Ĉar al nuntempaj LLM-arkitekturoj mankas rekursio, ili fundamente ne kapablas plenumi iujn matematikajn operaciojn.
date: "2023-08-23"
lastUpdated: "2024-06-24"
tags: [ml/ai]
---

*ĜISDATIGO 2024: Nur por klarigi, ĉi tiu artikolo temas pri matematikaj operacioj, kiuj esence implikas plurajn rekursiajn paŝojn, kiel potencigon. Kiel montris iuj [interesaj esploroj](https://arxiv.org/abs/2405.17399v1), Transformer-oj povas lerni fari bazan aritmetikon sufiĉe bone per kelkaj adaptoj. Aldoni &quot;scratchpad&quot; povas plu plibonigi la rendimenton de la modelo kaj eble estas bona provizora solvo por la problemoj menciitaj en ĉi tiu artikolo.*

## La problemo

LLM-oj havas grandegan potencialon en multaj kampoj, sed la plej multaj nuntempaj modeloj havas unu enecan limon: ili estas strukture nur feed-forward-aj. Tio signifas, ke datenoj fluas lineare de enigo al eligo, sen rekursio aŭ retrospurado. Tio ebligas nekredeble rapidan kaj efikan trejnadon per gradienta malsupreniro kaj retrodisvastigo. Kalkuloj povas esti farataj paralele per matrica multipliko.

Bedaŭrinde, ilia manko de rekursio malebligas iujn specojn de matematikaj operacioj. Konsideru potencigon. ChatGPT povas solvi simplajn taskojn pri potencoj, sed kiam oni demandas, kiom estas X^Y ĉe grandaj valoroj de X aŭ Y, ĝi fariĝas malpreciza.

Kvankam potencaj operacioj povas esti malkonstruitaj en linearan sinsekvon, estas neeble por finia, feed-forward-a neŭra reto trakti ajnan eblan rekursian operacion (t.e., X^Y kun ajna ebla valoro de Y). La kvanto de rekursio, kiun LLM povas &quot;simuli&quot;, estas limigita de la nombro de ĝiaj parametroj kaj tavoloj.

## Resumo

Manko de rekursio estas eneca dezajna limigo de nunaj GPT-stilaj LLM-oj, kiu malebligas al ili plenumi komplikajn matematikajn operaciojn. Tamen fakte tio ne gravas en plej multaj uzoj de LLM-oj! Ili ankoraŭ estas potencaj kaj utilaj en tre vasta gamo de cirkonstancoj.

## Amuzaĵoj

Ankoraŭ restas multe da laboro por vere kompreni la konduton de trejnitaj grandaj lingvomodeloj. Jen io fascina, kion mi malkovris dum la verkado de ĉi tiu artikolo:

Kiam mi demandis al ChatGPT, kiom estas 7^15, ĝi respondis **170,859,375**. La ĝusta respondo estas **4,747,561,509,943**.

Kvankam tiu respondo estas evidente malĝusta, **170,859,375** havas apartan econ: ĝi faktorigas kiel **(3^7)*(5^7)**. Ŝajnas, ke la modelo iel transformis **A^(B*C)** en **(B^A)*(C^A)**. Mi tre ŝatus scii, kial tio okazas!